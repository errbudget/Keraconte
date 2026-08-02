"""Détection et OCR de la bulle de dialogue (dépend de text). Isole la bulle
dans l'image, en lit le texte, écarte le bruit d'icônes et les réponses du
joueur.
"""

import os
import re
import shutil
import sys
import tempfile
import time

import cv2
import numpy as np
import pytesseract
from PIL import Image

from keraconte.text import clean
from keraconte.trace import trace as _trace


def configurer_tesseract():
    """Localise le binaire tesseract et ses données, de façon portable.

    pytesseract lance le binaire « tesseract » du PATH. Sous Linux c'est le
    cas après installation par la distribution ; sous Windows l'installeur
    standard (UB-Mannheim) n'ajoute RIEN au PATH — l'appel échouerait avec un
    « tesseract is not installed ». On résout donc, dans l'ordre :

    1. « QR_TESSERACT » (variable d'environnement) : chemin explicite du
       binaire, échappatoire universelle.
    2. Un binaire embarqué à côté de l'exécutable figé (PyInstaller pose ses
       ressources sous « sys._MEIPASS ») : c'est le cas du « fat exec ».
    3. « shutil.which » : le binaire du PATH, chemin nominal sous Linux.
    Sinon on ne touche à rien : pytesseract garde son défaut.

    Les données de langue (« fra ») suivent la même logique via
    « TESSDATA_PREFIX » : respecté s'il est déjà posé, sinon pointé vers les
    données embarquées quand elles existent.
    """
    binaire = os.environ.get("QR_TESSERACT")
    racine_figee = getattr(sys, "_MEIPASS", None)
    if not binaire and racine_figee:
        nom = "tesseract.exe" if sys.platform == "win32" else "tesseract"
        candidat = os.path.join(racine_figee, nom)
        if os.path.isfile(candidat):
            binaire = candidat
    if not binaire:
        binaire = shutil.which("tesseract")
    if binaire:
        pytesseract.pytesseract.tesseract_cmd = binaire

    # Données de langue embarquées, sans écraser un TESSDATA_PREFIX déjà posé.
    if "TESSDATA_PREFIX" not in os.environ and racine_figee:
        tessdata = os.path.join(racine_figee, "tessdata")
        if os.path.isdir(tessdata):
            os.environ["TESSDATA_PREFIX"] = tessdata


configurer_tesseract()

# Deux habillages de bulle coexistent selon le thème choisi dans le jeu.
#
# Le thème sombre d'origine peint un aplat gris neutre, que le décor coloré
# de Dofus ne sait pas imiter : l'écart entre canaux RVB suffit à l'isoler.
MAX_CHANNEL_SPREAD = 12
VALUE_MIN, VALUE_MAX = 18, 75
# Le thème bleu, lui, est trop coloré pour ce critère — son écart monte à 23
# quand le bois du décor est à 47. C'est alors la teinte qui tranche, et elle
# tranche mieux : mesuré sur une capture de forge, bulle et réponses à 117,
# tout le décor sous 28. Aucune fuite dans les zones témoins.
BLUE_HUE_MIN, BLUE_HUE_MAX = 100, 135
BLUE_VALUE_MIN, BLUE_VALUE_MAX = 30, 90

# CLOSE doit rester étroit : à 5 et au-delà, il soude la bulle au bloc de
# réponses quand l'écart est serré, et l'appariement ne trouve plus la
# paire qu'il exige — le dialogue passe alors inaperçu.
#
# Ces tailles restent en pixels absolus, à dessein. Un noyau modifie ce que
# l'OCR voit sur CHAQUE capture : le rendre relatif à la hauteur changerait
# sa taille effective d'une fixture à l'autre. À 9/1350 puis 3/1350, les
# crops (401 px de haut) recevraient un noyau de 3×3 et 1×1 au lieu de 9×9
# et 3×3 — soit une tout autre segmentation, et un risque de régression OCR
# ailleurs. On préfère l'absolu à ce prix.
OPEN_KERNEL = np.ones((9, 9), np.uint8)
CLOSE_KERNEL = np.ones((3, 3), np.uint8)

# Au-delà, un bloc est trop haut pour un simple panneau : il porte le
# dialogue et ses réponses soudés. Mesuré à 664 px sur une capture où les
# deux se touchent, contre 218 px pour une bulle seule.
#
# Laissé en pixels absolus, à dessein — contrairement aux autres seuils
# géométriques. Le rendre relatif suppose un rapport de forme (hauteur ÷
# largeur), mais la géométrie l'interdit : la bulle soudée d'« enrolement »
# a un rapport de 1,08, plus PLAT que les panneaux d'interface à écarter
# (1,15 à 1,70). Aucun seuil de rapport ne sépare donc les deux. Cette
# valeur absolue ne fonctionne que parce que, à la résolution des fixtures,
# elle tombe dans l'intervalle (314, 664] entre roukerol — rattrapé par la
# re-segmentation — et la bulle soudée. La rendre relative ferait basculer
# un panneau d'enclos (346×399) dans la branche fusionnée, où seul le ratio
# de blanc l'écarte encore, et de justesse (0,0052 contre un seuil de
# 0,008). Un écran d'une autre résolution ne sera pas mieux servi, mais le
# forcer casserait cet équilibre. À revoir avec une capture fusionnée prise
# à une autre définition, pour caler un vrai seuil relatif.
MERGED_MIN_HEIGHT = 400

# Un sous-contour issu de la re-segmentation n'est retenu que s'il fait au
# moins cette fraction de la largeur du bloc et de sa hauteur : en deçà,
# c'est une écharde de masque, pas une bulle ni un bloc de réponses. En
# fractions du bloc, jamais en pixels : la résolution ne doit pas compter.
SUB_MIN_WIDTH_RATIO = 0.4
SUB_MIN_HEIGHT_RATIO = 0.06

# Accepter un bloc sans réponses appariées ouvre la porte aux panneaux de
# l'interface, isolés eux aussi : l'hôtel des ventes et les enclos se
# faisaient lire. Un dialogue est fait de phrases, un panneau d'étiquettes
# (« FILTRES », « ÉTABLE ») : la ponctuation les sépare nettement. Mesuré
# sur les mots sûrs — 15 à 50 % dans les bulles, 1 à 3 % dans les panneaux.
# La géométrie, elle, ne les séparait pas : un panneau d'enclos affiche le
# même rapport largeur/hauteur qu'une bulle soudée à ses réponses.
MIN_PUNCTUATION_RATIO = 0.08

# Taille minimale d'un bloc candidat, avant tout appariement : ici aucune
# bulle n'est encore connue.
#
# L'aire est laissée en pixels ABSOLUS, à dessein — au même titre que
# MERGED_MIN_HEIGHT et les noyaux morphologiques. On l'avait rapportée à l'aire
# de l'image (facteur au carré avec la résolution) ; c'était une erreur, que la
# mesure a corrigée. Le point de bascule fut un bloc de réponses à OPTION
# UNIQUE : chez le Gardien des Geôles (dossier themes/), la seule réponse
# « Demander quand… » ne fait que ~43800 px² de contour, là où un dialogue à
# plusieurs réponses en fait 54000 (brakmar) à 63000 (bworkidais). Ce plus
# petit bloc légitime (43800) restait au-dessus d'un plancher absolu de 40000,
# mais un seuil quadratique, gonflé à 48000 par la taille de la FENÊTRE
# (2710×1539), l'écartait — et le dialogue passait inaperçu dans les 10 thèmes.
# Un seuil absolu ne dépend pas de la fenêtre : marge saine (43800/40000 = 1,10),
# et sur 67 captures d'interface AUCUN contour écarté par l'aire ne tombe dans
# la bande [0,85 ; 1,10] — desserrer n'admet aucun panneau à la marge. Les deux
# crops (theme_bleu 765×478, tokageko 721×401) passent aussi (44720, 82160).
#
# ⚠ Ce seuil absolu vaut pour la résolution de calibration (bulle 555-633 px de
# large sur toutes nos captures, 2550-2710). Il n'est PAS prouvé « toute
# résolution » : sur un rendu à une autre échelle (720p, 4K natif), la bulle
# change de taille et l'absolu ne suit pas. Objectif utilisateur = toute
# résolution, accessibilité ≥ 100 %, police > Petit. À caler avec une capture
# 1920×1080 / 100 % : si la bulle y reste 555-633 px, l'UI est en pixels fixes
# et l'absolu tient partout ; sinon il faut un proxy d'échelle de rendu.
#
# La largeur, elle, reste relative à la largeur d'image — non par théorie
# (aucune mesure ne dit qu'elle suit l'échelle quand l'aire ne la suit pas),
# mais faute de contre-exemple : ne pas y toucher sans mesure, les crops
# (721/765 px) la rendent risquée. Calibrée sur 2560×1350 (largeur mini 300 px).
MIN_AREA = 40000
MIN_WIDTH_RATIO = 300 / 2560
# Hauteur minimale d'un blob écarté au bord droit pour qu'il vaille la peine
# d'être vidé sur disque (diagnostic QR_DEBUG seul, aucun effet sur la lecture).
# Une bulle mesure 150 à 660 px de haut sur les registres, soit 0,10 à 0,46 de
# la hauteur d'image : sous 0,10, le blob est un bandeau qui ne peut pas en
# cacher une. En fraction, jamais en pixels d'une résolution donnée.
MIN_BLOB_HEIGHT_RATIO = 0.10
# Plancher de longueur du texte lu. Deux valeurs selon la preuve accumulée :
# sans réponses appariées, le bloc n'est admis que sur sa hauteur ou sa
# ponctuation, et ce plancher écarte le bruit OCR d'un panneau (fragments
# épars). Avec réponses appariées, le signal relationnel a déjà prouvé le
# dialogue : un plancher long y rejetterait à tort les répliques courtes
# (« Zog Zog à toâ. », 14 car.), relevées en jeu chez Gobriel et un Bwork. On
# n'y garde qu'un plancher bas, juste de quoi écarter une écharde de deux ou
# trois lettres.
MIN_CHARS = 20
MIN_CHARS_PAIRED = 6

# Le texte de dialogue est blanc sur gris. Mesuré : 2.9 % dans une vraie
# bulle contre 0.1 % pour un bloc d'interface sans texte.
MIN_WHITE_RATIO = 0.008
MAX_WHITE_RATIO = 0.15

# Écart vertical entre la bulle et le bloc de réponses. Mesuré à -16 px :
# les deux blocs se touchent, avec un léger recouvrement.
#
# Exprimés en fraction de la largeur de la bulle, et non en pixels absolus :
# c'est la seule référence stable d'une résolution à l'autre. La largeur de
# la bulle vaut 555 à 633 px sur toutes les fixtures — pleines captures comme
# crops — quand la largeur d'image, elle, varie du simple au triple. Un écran
# deux fois plus défini donne une bulle deux fois plus large, et ces seuils
# suivent. Calibrés sur une largeur de bulle de référence de 600 px, ils
# reproduisent à moins de 6 % près les valeurs absolues d'origine (160, 40,
# 60) sur les fixtures actuelles.
REF_BUBBLE_WIDTH = 600
# L'écart toléré entre la base de la bulle et le haut de sa réponse. La valeur
# héritée (160/600 ≈ 0,27) venait de la calibration absolue d'avant les
# fixtures (cf. 3f422cb, « à 6 % près des valeurs d'origine ») : permissive par
# héritage, non par une mesure. Or un vrai bloc de réponses COLLE à sa bulle,
# tandis qu'un panneau d'interface place sa fausse « réponse » loin en dessous.
# Mesuré (gap/largeur de bulle) sur tous les registres : 25 vrais dialogues de
# -0,012 à 0,041 (réponses collées, chevauchement léger compris), faux positifs
# d'interface de 0,089 à 0,202 — plus le HDV relevé en jeu à 0,166. Le seuil à
# 0,06 tombe dans la bande vide entre les deux et écarte cinq des six faux
# positifs restants (hdv, cosmétique, écran de fin de combat). Un panneau à
# fausse bande collée (recettes) reste hors de portée du gap : cas isolé assumé.
MAX_REPLY_GAP_RATIO = 0.06
MAX_REPLY_OVERLAP_RATIO = 40 / REF_BUBBLE_WIDTH
ALIGN_TOLERANCE_RATIO = 60 / REF_BUBBLE_WIDTH

# Tolérance pour reconnaître « la même boîte » d'une image à l'autre : une
# bulle dont l'OCR cligne reste au même endroit, à quelques pixels de gigue
# de contour près. En fraction des dimensions de la boîte, jamais en pixels :
# la gigue suit la taille de la bulle, donc la résolution.
SAME_BOX_TOLERANCE = 0.2

# Bordure ignorée à l'OCR, pour écarter les icônes des coins.
MARGIN = 34

# Seuils du tri des mots, relevés sur les fixtures via image_to_data.
# Le bruit qui survit au test de structure sort entre 24 et 50 de confiance
# (« PE » 24, « E » 36, « e » 43, « A » 44, « : » 50) ; les vrais mots courts
# sont bien au-dessus (« Si » 83, « tu » 83, « as » 91, « à » 96). Le seuil
# tient dans cet écart, sans le serrer : l'OCR fait varier ces scores d'une
# image à l'autre.
MIN_WORD_CONFIDENCE = 60
# Les vrais mots mal notés sont longs (« t'enrôler » 41, « lieux, » 53) :
# c'est leur longueur qui les sauve. Le bruit, lui, tient en trois signes.
MAX_NOISE_LENGTH = 3

# Interligne mesuré dans une bulle : 16 à 20 px. L'écart jusqu'au bloc de
# réponses vaut 95 px sur la capture « enrolement ». Le seuil sépare les deux
# sans les toucher.
#
# Ces deux seuils restent en pixels absolus, à dessein. « drop_replies »
# travaille sur des ordonnées de mots, sans l'image ni le bloc sous la main :
# aucune dimension de référence n'y est disponible. Et surtout, un interligne
# suit la taille de la POLICE — donc la résolution de l'écran — et non la
# hauteur de la bulle : le rapporter à la hauteur du bloc serait la mauvaise
# référence, une bulle haute n'ayant pas un interligne plus large. Deux tests
# appellent « drop_replies » avec des ordonnées écrites en dur ; les rendre
# relatifs changerait sa signature. À caler sur la taille de police le jour
# où on la mesure, pas sur une dimension d'image.
MIN_REPLY_LINE_GAP = 40
# Deux mots d'une même ligne diffèrent de quelques pixels en ordonnée : leurs
# lignes de base ne coïncident pas au pixel près (mesuré jusqu'à 4 px).
LINE_TOLERANCE = 10
# Le bandeau d'icônes en haut de bulle (⋮, ✕) sort à l'OCR en mots isolés
# posés AU-DESSUS de la première ligne de texte, séparés d'elle par un écart
# bien plus large qu'un interligne. Mesuré chez Bworknroll : écart bandeau→texte
# 48 px pour un interligne de 25 (ratio 1,96), quand un dialogue propre a des
# écarts réguliers (ratio ≤ 1,08 sur enrolement/roukerol). Le seuil se pose au
# milieu. On compare le plus grand écart à la MÉDIANE DES AUTRES : l'inclure
# fausserait la référence par le bruit même qu'on isole.
TOP_CHROME_GAP_RATIO = 1.5
# On ne retire la bande de tête que si elle est minoritaire : au-dessus de
# cette part des mots, le « haut » porte du vrai texte (saut de paragraphe),
# pas des icônes. Chez Bworknroll le bandeau pèse 2 mots sur 40.
MAX_TOP_CHROME_RATIO = 0.3
# En deçà de ce nombre de groupes de lignes, la médiane des écarts n'a pas de
# sens (0 ou 1 autre écart) : on ne peut pas distinguer un bandeau d'un vrai
# interligne, donc on ne retire rien — quitte à laisser passer le bruit.
MIN_LINES_FOR_CHROME = 4


def bubble_mask(frame):
    """Masque des aplats de bulle, avant la fermeture morphologique.

    Isolé de « find_bubbles » pour être réutilisé tel quel sur un fragment
    d'image : la re-segmentation fine (voir « splits_into_pair ») repart de
    ce masque brut, sans la fermeture qui, elle, soude parfois deux blocs.
    """
    blue, green, red = cv2.split(frame.astype(np.int16))
    spread = np.maximum(np.maximum(blue, green), red) - np.minimum(
        np.minimum(blue, green), red
    )
    hsv = cv2.cvtColor(frame, cv2.COLOR_BGR2HSV)
    hue, value = hsv[:, :, 0], hsv[:, :, 2]

    # Les deux thèmes sont reconnus d'un même masque : ils ne se recouvrent
    # pas — un aplat gris n'a pas de teinte bleue franche — donc les unir
    # n'ouvre la porte à aucun décor que l'un ou l'autre laissait dehors.
    neutral = (spread < MAX_CHANNEL_SPREAD) & (value > VALUE_MIN) & (value < VALUE_MAX)
    blueish = (
        (hue >= BLUE_HUE_MIN)
        & (hue <= BLUE_HUE_MAX)
        & (value > BLUE_VALUE_MIN)
        & (value < BLUE_VALUE_MAX)
    )
    mask = (neutral | blueish).astype(np.uint8) * 255
    return cv2.morphologyEx(mask, cv2.MORPH_OPEN, OPEN_KERNEL)


def _vider_image(frame, blob):
    """Sauve une image écartée au bord droit, pour l'analyser hors ligne.

    Le défaut ne se reproduit pas sur les captures d'écran fournies à la main :
    celles-ci contiennent la barre de titre de la fenêtre (2710 px de large)
    là où le portail livre le contenu seul (2560 px, ce que dit la trace :
    « width*0.99 = 2534 »). Trois correctifs ont été conçus contre une image
    qui PASSE, donc validés sur la mauvaise entrée. Ce vidage donne l'image
    exactement telle que « find_bubbles » l'a vue.

    Piège vu au premier essai, qui a ramené une image SANS dialogue : le rejet
    au bord droit se produit à CHAQUE image, dialogue ou non — le décor et
    l'interface latérale y touchent en permanence. Garder « la première »
    revenait à garder l'image de démarrage.

    On garde donc un ROULEMENT des dernières images retenues, plutôt qu'une
    seule : le diagnostic ne dépend plus de l'instant exact où l'on quitte.
    Un premier filtre écarte les blobs trop PLATS pour cacher une bulle
    (bandeaux, liserés d'interface), en fraction de la hauteur d'image et
    jamais en pixels d'une résolution donnée.
    """
    if not os.environ.get("QR_DEBUG"):
        return
    height = frame.shape[0]
    _y, _x, _w, h = blob
    if h < height * MIN_BLOB_HEIGHT_RATIO:
        return
    global _VIDAGES
    chemin = os.path.join(
        tempfile.gettempdir(), f"keraconte-bord-droit-{_VIDAGES % NB_VIDAGES}.png"
    )
    _VIDAGES += 1
    try:
        cv2.imwrite(chemin, frame)
        _trace(f"  >>> image écartée sauvée (blob h={h}) : {chemin}")
    except Exception as erreur:  # jamais laisser un diagnostic casser la lecture
        _trace(f"  >>> vidage impossible : {erreur}")


# Combien d'images écartées on garde en roulement (diagnostic QR_DEBUG seul).
# Huit couvre deux secondes à --fps 4 : assez pour que le dialogue visé y
# figure quel que soit l'instant du Ctrl+C, sans remplir le disque.
NB_VIDAGES = 8
_VIDAGES = 0


def find_bubbles(frame):
    """Repère les blocs qui ont l'aspect d'une bulle, sans lire leur texte.

    Séparé de « find_dialog » pour distinguer deux situations qu'un simple
    « None » confondait : la bulle a disparu de l'écran, ou elle est bien là
    mais l'OCR n'en a rien tiré. La première doit couper la voix, la seconde
    surtout pas — c'est la même réplique qui continue de s'afficher.
    """
    height, width = frame.shape[:2]
    # La fermeture soude les lignes d'un même bloc ; c'est elle aussi qui,
    # quand bulle et réponses se touchent, les fond en un seul contour.
    # « splits_into_pair » repart du masque d'avant pour les distinguer.
    brut = bubble_mask(frame)
    mask = cv2.morphologyEx(brut, cv2.MORPH_CLOSE, CLOSE_KERNEL)

    contours, _ = cv2.findContours(mask, cv2.RETR_EXTERNAL, cv2.CHAIN_APPROX_SIMPLE)
    # L'aire mini est absolue (une bulle ne grandit pas avec l'aire de
    # l'écran, cf. MIN_AREA) ; la largeur mini suit la largeur de l'image.
    min_area = MIN_AREA
    min_width = MIN_WIDTH_RATIO * width
    boxes = []
    for contour in contours:
        x, y, w, h = cv2.boundingRect(contour)
        if w * h < min_area or w < min_width:
            continue
        # L'interface de droite touche le bord ; le reste (chat compris)
        # est écarté par l'exigence d'un bloc de réponses apparié.
        if x + w > width * 0.99:
            _trace(
                f"  contour ÉCARTÉ=bord-droit (y={y} x={x} w={w} h={h}) "
                f"x+w={x + w} > {width * 0.99:.0f}"
            )
            _vider_image(frame, (y, x, w, h))
            # Écarter le blob ENTIER perdait la bulle qu'il pouvait contenir.
            # Mesuré en jeu (Affreudite, forge de Brâkmar) : le décor gris de
            # la carte entre dans le masque comme un fond de bulle, la
            # fermeture soude tout jusqu'au bord, et un contour de 2560×773
            # avalait la bulle à 100 % — d'où « ocr=0ms », l'OCR n'était même
            # pas appelé et le dialogue n'était JAMAIS lu.
            boxes.extend(_resegmenter(brut, (y, x, w, h), width, min_area, min_width))
            continue
        boxes.append((y, x, w, h))

    boxes.sort()
    return boxes, height


def _resegmenter(brut, blob, width, min_area, min_width):
    """Cherche des bulles DANS un blob écarté au bord droit.

    Même mécanique que « splits_into_pair » : on repart du masque d'AVANT
    fermeture, restreint au blob. Sans la fermeture qui les soudait, la bulle
    et le décor redeviennent des contours distincts, et les critères habituels
    s'appliquent à chacun — aucun seuil nouveau, aucun cas particulier.

    Les trois filtres sont ceux de « find_bubbles », y compris le bord droit :
    une sous-partie qui touche ELLE-MÊME le bord reste écartée. C'est ce qui
    garde dehors le panneau d'interface latéral, présent à chaque image.

    Ne rend donc la parole qu'aux blocs qui auraient été admis si le décor ne
    les avait pas soudés au bord ; la preuve d'appariement, elle, reste due.
    """
    y, x, w, h = blob
    contours, _ = cv2.findContours(
        brut[y : y + h, x : x + w], cv2.RETR_EXTERNAL, cv2.CHAIN_APPROX_SIMPLE
    )
    parts = []
    for contour in contours:
        cx, cy, cw, ch = cv2.boundingRect(contour)
        if cw * ch < min_area or cw < min_width:
            continue
        if (x + cx) + cw > width * 0.99:
            continue
        parts.append((y + cy, x + cx, cw, ch))
    if parts:
        _trace(f"  blob ré-segmenté : {len(parts)} bloc(s) récupéré(s) {sorted(parts)}")
    return parts


def splits_into_pair(frame, box):
    """Ce bloc unique cache-t-il une bulle soudée à ses réponses ?

    Chez certains PNJ, bulle et réponses se touchent : la fermeture
    morphologique globale les fond en un seul contour, et l'appariement
    dialogue/réponses ne trouve plus sa paire — le dialogue passe inaperçu.
    Un seuil de hauteur ne les rattrape pas : le chat et les panneaux de
    l'interface atteignent la même hauteur sans être des dialogues.

    On repart donc du masque d'avant fermeture, restreint à ce seul bloc :
    sans la fermeture qui les soudait, la bulle et les réponses redeviennent
    deux contours distincts, et l'appariement habituel — le seul signal
    fiable, relationnel — s'applique à nouveau. Un vrai bloc isolé (chat,
    panneau, bulle sans réponses) ne se scinde pas : il n'a pas cette paire.

    L'OCR, lui, continue de lire le bloc entier inchangé : cette
    re-segmentation ne sert qu'à décider s'il existe une paire, jamais à
    recadrer le texte.
    """
    y, x, w, h = box
    region = bubble_mask(frame[y : y + h, x : x + w])
    contours, _ = cv2.findContours(
        region, cv2.RETR_EXTERNAL, cv2.CHAIN_APPROX_SIMPLE
    )
    parts = []
    for contour in contours:
        cx, cy, cw, ch = cv2.boundingRect(contour)
        # Les échardes de masque sont écartées en proportion du bloc, pour
        # ne dépendre d'aucune résolution.
        if cw < w * SUB_MIN_WIDTH_RATIO or ch < h * SUB_MIN_HEIGHT_RATIO:
            continue
        parts.append((cy, cx, cw, ch))
    parts.sort()
    # L'appariement est celui de « is_reply_block » : un bloc de réponses aligné,
    # de largeur voisine, juste sous le texte. Un test de plus, propre à la
    # re-segmentation : la réponse ne doit pas être PLUS HAUTE que la bulle.
    #
    # « is_reply_block » vérifie l'écart, l'alignement et la largeur — que la
    # structure interne d'un panneau d'interface imite par construction (un
    # en-tête étroit au-dessus d'une liste alignée de même largeur). Ce qui la
    # trahit, c'est la hauteur : un vrai bloc de réponses (1 à 4 options) est
    # toujours plus court que la bulle de dialogue qu'il suit ; la « réponse »
    # d'un panneau est sa liste entière (destinations d'un zaap, table de l'hôtel
    # des ventes), bien plus haute que son en-tête. Mesuré sur les registres :
    # vrais dialogues à 0,38-0,72 (réponse/bulle), faux positifs d'interface à
    # 1,70-14,23 — le seuil à 1 tombe dans une bande vide. L'invariant, et non un
    # nombre ajusté : une réponse n'est jamais plus haute que la bulle.
    for above_index, above in enumerate(parts):
        above_h = above[3]
        for below in parts[above_index + 1 :]:
            if is_reply_block(above, below) and below[3] <= above_h:
                return True
    return False


def find_reply_below(frame, bubble):
    """Cherche le bloc de réponses juste SOUS une bulle validée, ou None.

    « find_bubbles » écarte tout contour dont l'aire tombe sous « MIN_AREA » —
    un plancher pensé pour les candidats-BULLES isolés, où aucune échelle n'est
    encore connue. Mais une réponse à UNE seule ligne (« S'en aller. », relevée
    chez Hazel Ementaire) fait ~36000 px² : sous ce plancher, elle ne devient
    jamais un contour, l'appariement ne la voit pas, et le dialogue passe
    inaperçu (« pas-de-preuve »). C'est une asymétrie : « splits_into_pair »,
    lui, apparie une réponse courte FUSIONNÉE à sa bulle avec des seuils
    seulement RELATIFS, sans plancher d'aire. Ce second passage étend la même
    discipline au cas SÉPARÉ — la bulle est déjà prouvée, on ne fait que
    chercher sa réponse en dessous, bornés par sa géométrie.

    On re-segmente la bande sous la bulle (généreuse en largeur, pour ne pas
    rogner un contour au bord et fausser sa boîte), on filtre les échardes en
    proportion de la bulle, et l'on rend la première boîte qui passe
    « is_reply_block ». Aucun plancher d'aire : c'est la preuve relationnelle,
    et elle seule, qui admet le bloc — un panneau isolé n'en a pas.
    """
    by, bx, bw, bh = bubble
    height, width = frame.shape[:2]
    # Bande sous la bulle : de sa base jusqu'au plus grand écart toléré, plus
    # une hauteur de réponse plausible. En largeur, la bulle élargie de la
    # tolérance d'alignement de chaque côté.
    max_gap = bw * MAX_REPLY_GAP_RATIO
    align = bw * ALIGN_TOLERANCE_RATIO
    top = by + bh
    # Sous la base de la bulle : le plus grand écart toléré par is_reply_block,
    # plus une hauteur de réponse plausible (une bulle de dialogue) au-delà.
    bottom = min(height, int(top + max_gap + bh))
    left = max(0, int(bx - align))
    right = min(width, int(bx + bw + align))
    if bottom <= top or right <= left:
        return None
    region = bubble_mask(frame[top:bottom, left:right])
    contours, _ = cv2.findContours(
        region, cv2.RETR_EXTERNAL, cv2.CHAIN_APPROX_SIMPLE
    )
    candidates = []
    for contour in contours:
        cx, cy, cw, ch = cv2.boundingRect(contour)
        # Échardes écartées en proportion de la bulle, jamais en pixels.
        if cw < bw * SUB_MIN_WIDTH_RATIO or ch < bh * SUB_MIN_HEIGHT_RATIO:
            continue
        # Coordonnées ramenées au repère plein cadre, format (y, x, w, h).
        candidates.append((cy + top, cx + left, cw, ch))
    candidates.sort()
    for candidate in candidates:
        if is_reply_block(bubble, candidate):
            return candidate
    return None


def find_dialog(frame):
    """Renvoie le texte de la bulle de dialogue, ou None."""
    text, _ = find_dialog_box(frame)
    return text


def find_dialog_box(frame, boxes=None):
    """Renvoie (texte, boîte) de la bulle de dialogue, ou (None, None).

    La boîte — (y, x, w, h) du contour lu — sert au lecteur à savoir, quand
    l'OCR redevient muet, si c'est bien CETTE bulle qui est encore à l'écran
    ou seulement le décor (chat, barre de sorts) : eux n'occupent jamais sa
    place. Sans ce repère, la présence d'un panneau permanent empêchait la
    voix de se couper à la fermeture du dialogue.

    Le bloc de réponses partage l'aspect de la bulle : on ne garde que le
    bloc le plus haut, qui est toujours le dialogue lui-même.

    « boxes » permet de réutiliser une segmentation déjà faite : quand l'image
    n'a pas de texte, le lecteur rappelle « bubble_still_there » sur la même
    image, et « find_bubbles » (morphologie pleine image) tournait deux fois.
    Fourni, on ne re-segmente pas ; laissé à None, on segmente comme avant —
    l'API reste inchangée pour les tests et le chemin « --test ».
    """
    if boxes is None:
        boxes, _ = find_bubbles(frame)
    _ocr_ms = 0.0

    # Un dialogue de PNJ est toujours suivi d'un bloc de réponses juste
    # en dessous. Les panneaux d'interface, eux, sont isolés : exiger la
    # paire écarte les faux positifs.
    for index, (y, x, w, h) in enumerate(boxes):
        replies = next(
            (
                other
                for other in boxes[index + 1 :]
                if is_reply_block((y, x, w, h), other)
            ),
            None,
        )
        # Quand les deux blocs se touchent, la fermeture les fond en un seul :
        # la paire manque alors. On la rattrape en re-segmentant finement le
        # bloc (« splits_into_pair »), ce qui rend la bulle et les réponses
        # comme deux contours et rétablit l'appariement.
        #
        # SEULE la preuve RELATIONNELLE admet ici un bloc : appariement d'emblée
        # (« replies is not None »), réponse mono-ligne trouvée sous la bulle
        # (« find_reply_below »), ou paire retrouvée par re-segmentation
        # (« splits_into_pair »). La hauteur, elle, ne prouvait rien : mesuré sur
        # les registres (themes + dialogues + echelle), AUCUN vrai dialogue
        # n'était admis par sa seule hauteur — tous passaient par l'une des trois
        # preuves ci-dessus. En revanche cinq panneaux d'interface (compagnons,
        # guilde, métiers, succès, un sort) atteignaient « h >= MERGED_MIN_HEIGHT »
        # et étaient lus à tort. L'ancien « h >= MERGED or splits » est donc
        # retiré : un bloc sans paire est désormais toujours écarté ici.
        #
        # « MERGED_MIN_HEIGHT » et « reads_like_dialogue » restent définis : le
        # premier documente le seuil retiré, le second est le filet de secours
        # (plus bas) pour un éventuel bloc admis sans preuve relationnelle —
        # aujourd'hui aucun, mais le jeu de dialogues « appariables » s'agrandit
        # à mesure qu'on le découvre (Hazel n'est appariée que depuis
        # « find_reply_below »).
        #
        # « splits_into_pair » tourne inconditionnellement : ne pas l'« optimiser »
        # derrière un pré-filtre de hauteur (son coût, bubble_mask sur la seule
        # région, est négligeable face à l'OCR), sans quoi un bloc haut ET fusionné
        # (L'Explorancienne à 100 %, h=435) échapperait à la re-segmentation.
        # Une réponse à une seule ligne est trop petite pour survivre au
        # plancher d'aire de « find_bubbles » : elle n'est donc pas dans
        # « boxes », et l'appariement d'emblée ci-dessus l'a manquée. On la
        # rattrape en re-segmentant la bande sous la bulle, sans plancher
        # d'aire. Trouvée, elle devient un « replies » à part entière : le
        # bloc suit alors le chemin apparié complet (drop_replies, plancher
        # bas, saut de reads_like_dialogue), exactement comme un appariement
        # d'emblée. NE PAS se contenter de « paired=True » sans poser
        # « replies » : « drop_replies » tournerait sur un bloc sans réponses
        # et le tronquerait au premier large blanc.
        #
        # « _origine » (silencieux hors QR_DEBUG) note LAQUELLE des trois preuves
        # a admis le bloc : sert à trier les faux positifs d'interface restants
        # par le chemin qui les laisse passer (split vs emblée).
        _origine = "emblée" if replies is not None else None
        if replies is None:
            replies = find_reply_below(frame, (y, x, w, h))
            if replies is not None:
                _origine = "below"
        paired = replies is not None
        if not paired:
            paired = splits_into_pair(frame, (y, x, w, h))
            if paired:
                _origine = "split"
            else:
                # Trace par box (silencieuse hors QR_DEBUG) : le bloc n'a aucune
                # preuve relationnelle, il est écarté. Sert à mesurer, sur un flux
                # en jeu, la DISTRIBUTION des chemins d'une image à l'autre — un
                # instantané ne montre pas la variance de la fusion morphologique.
                _trace(f"  box (y={y} x={x} w={w} h={h}) PORTE=pas-de-preuve")
                continue
        region = frame[y : y + h, x : x + w]
        white = (region > 200).all(2).mean()
        if not MIN_WHITE_RATIO <= white <= MAX_WHITE_RATIO:
            _trace(
                f"  box (y={y} x={x} w={w} h={h}) PORTE=white "
                f"paired={paired} white={white:.4f}"
            )
            continue
        # Pas de rognage : la boîte est parfois déjà serrée sur le texte,
        # et rogner amputerait le dialogue. Les icônes des coins sortent
        # en mots isolés, qu'on écarte un à un ci-dessous.
        crop = cv2.cvtColor(region, cv2.COLOR_BGR2RGB)
        # image_to_data plutôt que image_to_string : c'est le seul moyen
        # d'obtenir la confiance et la boîte de chaque mot, sur lesquelles
        # reposent le tri du bruit et le repérage des réponses.
        # On garde le moteur par défaut « --oem 3 » (legacy + LSTM fusionnés).
        # « --oem 1 » (LSTM seul) est ~35 % plus rapide et rend un texte
        # identique sur une bulle simple, MAIS il place les boîtes par mot
        # autrement : sur un bloc fusionné à ses réponses (cas Roukerol),
        # « drop_replies » — qui sépare dialogue et réponses par le large blanc
        # entre boîtes — coupe alors tout sauf un mot, et le dialogue n'est plus
        # lu du tout. Le gain de vitesse ne vaut pas la perte d'un cas réel ;
        # ré-ajuster « drop_replies » pour OEM 1 serait un chantier à part.
        _t1 = time.perf_counter()
        data = pytesseract.image_to_data(
            Image.fromarray(crop), lang="fra", output_type=pytesseract.Output.DICT
        )
        _ocr_ms += (time.perf_counter() - _t1) * 1000
        words = read_words(data)
        # Sur un bloc fusionné, l'OCR ramène aussi les réponses du joueur :
        # elles se détachent par un large blanc, pas par leur grammaire. On les
        # retire dès qu'il n'y a pas d'appariement D'EMBLÉE (« replies is
        # None ») : même quand « splits_into_pair » a retrouvé la paire, l'OCR a
        # bien lu le bloc entier, réponses comprises.
        if replies is None:
            words = drop_replies(words)
        # Le bandeau d'icônes du haut de bulle (⋮, ✕) sort en « ë - » au-dessus
        # du texte : inconditionnel (la bulle appariée n'est pas passée par
        # « drop_replies »), avant tout calcul en aval qu'il polluerait.
        words = drop_top_chrome(words)
        # « reads_like_dialogue » n'écarte les panneaux d'interface que faute de
        # preuve relationnelle. On ne le soumet qu'aux blocs admis SANS preuve
        # (« not paired ») — filet de secours. On avait tenté de l'étendre au
        # chemin « split » pour écarter le panneau Recettes (dernier faux
        # positif) : la CI l'a infirmé. Le test repose sur un ratio de
        # ponctuation calibré (0,08) sur UNE version de Tesseract ; une autre
        # build décale d'un mot le décompte et fait basculer la décision. Marge
        # d'un seul mot de chaque côté (Recettes 3/46, L'Explorancienne 3/33) :
        # sur l'OCR de la CI, Recettes repassait ET le risque sur les vrais
        # dialogues re-segmentés n'était même pas mesuré (tests OCR désélectionnés
        # faute de « fra »). Contrairement aux seuils GÉOMÉTRIQUES (hauteur, écart,
        # aire), déterministes sur une image figée, un seuil issu du TEXTE OCR ne
        # se transporte pas d'une build à l'autre. Le panneau Recettes reste donc
        # un faux positif connu (une étiquette, « Galet Solaire 150 »), assumé.
        if not paired and not reads_like_dialogue(words):
            _trace(
                f"  box (y={y} x={x} w={w} h={h}) PORTE=like "
                f"mots={len(words)} paired={paired}"
            )
            continue
        text = clean(" ".join(word["text"] for word in words))
        floor = MIN_CHARS_PAIRED if paired else MIN_CHARS
        if len(text) >= floor:
            _trace(
                f"find_dialog_box: TEXTE | ocr={_ocr_ms:.0f}ms | {len(boxes)} boxe(s) "
                f"| box=(y={y} x={x} w={w} h={h}) paired={paired} "
                f"origine={_origine} reply={replies}"
            )
            return text, (y, x, w, h)
        _trace(
            f"  box (y={y} x={x} w={w} h={h}) PORTE=floor "
            f"paired={paired} len={len(text)} floor={floor}"
        )
    _trace(f"find_dialog_box: RIEN | ocr={_ocr_ms:.0f}ms | {len(boxes)} boxe(s)")
    return None, None


def bubble_still_there(frame, box, boxes=None):
    """La bulle lue à « box » occupe-t-elle toujours sa place à l'écran ?

    Sert quand l'OCR redevient muet : on ne coupe la voix que si CETTE bulle
    a disparu, pas si un autre bloc (chat, barre de sorts) subsiste — eux ne
    tiennent jamais la place de la bulle. Un simple « une bulle existe » ne
    suffisait pas : ces panneaux permanents comptaient comme une bulle et
    empêchaient toute coupure à la fermeture du dialogue.

    « boxes » réutilise une segmentation déjà faite par « find_dialog_box » sur
    la même image, pour ne pas relancer « find_bubbles » (morphologie pleine
    image) une seconde fois. Laissé à None, on segmente — l'API reste inchangée.
    """
    if box is None:
        return False
    y, x, w, h = box
    if boxes is None:
        boxes, _ = find_bubbles(frame)
    for (cy, cx, cw, ch) in boxes:
        if (
            abs(cx - x) <= w * SAME_BOX_TOLERANCE
            and abs(cy - y) <= h * SAME_BOX_TOLERANCE
            and abs(cw - w) <= w * SAME_BOX_TOLERANCE
            and abs(ch - h) <= h * SAME_BOX_TOLERANCE
        ):
            return True
    return False


def reads_like_dialogue(words):
    """Ces mots forment-ils des phrases, ou une liste d'étiquettes ?

    Les panneaux du jeu (hôtel des ventes, enclos) alignent des libellés
    sans ponctuation — « FILTRES », « ÉTABLE » — là où un dialogue enchaîne
    des phrases. La géométrie ne les distingue pas : certains panneaux ont
    le même rapport largeur/hauteur qu'une bulle soudée à ses réponses.
    """
    if not words:
        return False
    ponctues = sum(
        1 for word in words if any(sign in word["text"] for sign in ".,!?…")
    )
    return ponctues / len(words) >= MIN_PUNCTUATION_RATIO


def read_words(data):
    """Extrait les mots retenus de la sortie d'image_to_data.

    L'ordre de lecture est celui de Tesseract (bloc, paragraphe, ligne, mot)
    et non l'ordonnée brute : les fragments d'icônes forment leurs propres
    blocs, et trier sur « top » entrelacerait leurs lettres avec le texte.
    """
    words = []
    for index, text in enumerate(data["text"]):
        text = text.strip()
        if not text:
            continue
        if not keep_word(text, int(data["conf"][index])):
            continue
        words.append(
            {
                "text": text,
                "top": int(data["top"][index]),
                "order": (
                    int(data["block_num"][index]),
                    int(data["par_num"][index]),
                    int(data["line_num"][index]),
                    int(data["word_num"][index]),
                ),
            }
        )
    words.sort(key=lambda word: word["order"])
    return words


# Une voyelle, une apostrophe ou un tiret font un mot français plausible.
# L'apostrophe compte : « C' » et « d'y » sont des élisions, pas du bruit.
PLAUSIBLE = re.compile(r"[aeiouyàâäéèêëîïôöùûüÿœæAEIOUYÀÂÄÉÈÊËÎÏÔÖÙÛÜŒÆ’'-]")


def keep_word(text, confidence):
    """Ce mot vient-il du dialogue, ou d'une icône mal lue ?

    Deux signaux croisés, mesurés sur les fixtures : ni l'un ni l'autre ne
    suffit seul. La structure attrape le bruit bien noté (« x » à 95, « R »
    à 93), la confiance attrape le bruit plausible (« PE » 24, « A » 44).
    La position, elle, ne sert à rien : le bruit apparaît aussi en plein
    milieu d'une phrase (« Si ça A3 t'intéresse »).
    """
    text = text.strip()
    if not text:
        return False
    # Un nombre est toujours du dialogue : il porte les quantités de quête
    # (« ramène-moi 10 dagues ») et les horaires (« ouverte 24 heures sur
    # 24, »), et les taire prive le joueur de l'information. On accepte le
    # nombre PONCTUÉ, pas seulement « isdigit() » : le français colle la
    # virgule ou le point au chiffre (« 24, », « 24. »), et « 24,».isdigit()
    # est faux — ce qui faisait lire « 24 heures sur 24, » amputé en « sur ».
    # On exige au moins un chiffre et AUCUNE lettre : un fragment mêlant
    # chiffre et lettre (« 2E », « A3 ») reste écarté plus bas. Ce test passe
    # avant celui de la structure, qui rejetterait ces nombres faute de voyelle.
    if re.search(r"\d", text) and not re.search(r"[^\W\d_]", text):
        return True
    # Le français détache « ! » et « ? » du mot : l'OCR les rend alors
    # comme un mot à part. Ils portent l'intonation, et les jeter
    # transformait « Bienvenue ! » en « Bienvenue » — puis, la phrase
    # n'étant plus close, le mot disparaissait au nettoyage de queue.
    if all(sign in "!?…" for sign in text):
        return True
    # Mêler chiffres et lettres ne fait jamais un mot français : « A3 »,
    # « 2E », « SN 64 ». Aucune confiance ne rachète cette forme.
    if re.search(r"\d", text) and re.search(r"[^\W\d_]", text):
        return False
    # Sans voyelle, ce n'est pas un mot français — « »/ », « x », « R »,
    # « dn » — sauf une onomatopée, que le jeu écrit justement ainsi :
    # « Pssst » sort à 91 de confiance sur la capture « tokageko ». Le
    # bruit sans voyelle, lui, est court ET mal noté : rejeter sur la
    # seule structure tairait l'onomatopée.
    if not PLAUSIBLE.search(text):
        return len(text) > MAX_NOISE_LENGTH and confidence >= MIN_WORD_CONFIDENCE
    # Reste le bruit structurellement plausible (« PE » 24, « A » 44). Les
    # vrais mots mal notés sont longs (« t'enrôler » 41, « lieux, » 53) :
    # la longueur les sauve.
    return len(text) > MAX_NOISE_LENGTH or confidence >= MIN_WORD_CONFIDENCE


def drop_replies(words):
    """Retire les réponses du joueur d'un bloc fusionné, par géométrie.

    Les reconnaître à leur verbe à l'infinitif effaçait de vraies phrases
    de PNJ (« Rester ici serait dangereux. »). Or les réponses sont
    séparées du dialogue par un blanc bien plus large qu'un interligne :
    16 à 20 px entre deux lignes, 95 px avant le premier choix.
    """
    if not words:
        return words
    # Les mots d'une même ligne ne partagent pas exactement leur ordonnée :
    # on les regroupe par proximité, dans l'ordre où ils apparaissent.
    tops = sorted({word["top"] for word in words})
    lines = [[tops[0]]]
    for top in tops[1:]:
        if top - lines[-1][-1] <= LINE_TOLERANCE:
            lines[-1].append(top)
        else:
            lines.append([top])
    # Le dialogue occupe le haut du bloc : on coupe au premier grand écart.
    for previous, current in zip(lines, lines[1:]):
        if current[0] - previous[-1] >= MIN_REPLY_LINE_GAP:
            return [word for word in words if word["top"] <= previous[-1]]
    return words


def _mediane(valeurs):
    """Médiane d'une liste non vide, sans dépendance externe."""
    triees = sorted(valeurs)
    milieu = len(triees) // 2
    if len(triees) % 2:
        return triees[milieu]
    return (triees[milieu - 1] + triees[milieu]) / 2


def drop_top_chrome(words):
    """Retire le bandeau d'icônes en haut de bulle (⋮, ✕), par géométrie.

    Ces contrôles sortent à l'OCR en mots isolés (« ë », « - ») posés
    AU-DESSUS de la première ligne de texte, avec une confiance qui les fait
    passer « keep_word » — les filtrer au mot est donc impossible. Mais ils
    sont séparés du texte par un écart bien plus large qu'un interligne :
    48 px mesurés chez Bworknroll, contre 25 entre deux lignes.

    On repère cet écart comme le plus grand des débuts de ligne, rapporté à la
    médiane des AUTRES écarts (l'inclure fausserait la référence par le bruit
    qu'on isole), et l'on retire tout ce qui le précède. Deux gardes évitent
    d'amputer un vrai dialogue : il faut assez de lignes pour que la médiane ait
    un sens, et la bande de tête doit rester minoritaire — un « haut » qui porte
    l'essentiel du texte est un saut de paragraphe, pas un bandeau.

    Inconditionnel, APRÈS « drop_replies » : la bulle qui a révélé le bug est
    appariée à ses réponses (« drop_replies » n'a donc jamais tourné dessus), et
    le bandeau coiffe le dialogue quel que soit ce qui le suit.
    """
    if not words:
        return words
    tops = sorted({word["top"] for word in words})
    lines = [[tops[0]]]
    for top in tops[1:]:
        if top - lines[-1][-1] <= LINE_TOLERANCE:
            lines[-1].append(top)
        else:
            lines.append([top])
    if len(lines) < MIN_LINES_FOR_CHROME:
        return words
    starts = [line[0] for line in lines]
    gaps = [second - first for first, second in zip(starts, starts[1:])]
    candidat = max(gaps)
    index = gaps.index(candidat)
    autres = gaps[:index] + gaps[index + 1 :]
    if candidat < TOP_CHROME_GAP_RATIO * _mediane(autres):
        return words
    # La coupe est juste sous le plus grand écart : tout ce qui commence avant
    # la ligne qui le suit est le bandeau.
    seuil = starts[index + 1]
    tete = [word for word in words if word["top"] < seuil]
    if len(tete) > MAX_TOP_CHROME_RATIO * len(words):
        return words  # tête majoritaire : c'est du vrai texte
    return [word for word in words if word["top"] >= seuil]


def is_reply_block(dialog, candidate):
    """Le bloc candidat est-il la liste de réponses sous ce dialogue ?"""
    dialog_y, dialog_x, dialog_w, dialog_h = dialog
    y, x, w, _ = candidate
    # Les seuils suivent la largeur de la bulle : pris en pixels absolus, ils
    # se décalaient dès que la résolution de l'écran changeait.
    max_overlap = dialog_w * MAX_REPLY_OVERLAP_RATIO
    max_gap = dialog_w * MAX_REPLY_GAP_RATIO
    align_tolerance = dialog_w * ALIGN_TOLERANCE_RATIO
    # Les deux blocs se chevauchent parfois de quelques pixels.
    gap = y - (dialog_y + dialog_h)
    if not -max_overlap <= gap <= max_gap:
        return False
    # Les deux blocs partagent le même bord gauche et une largeur voisine.
    if abs(x - dialog_x) > align_tolerance:
        return False
    return abs(w - dialog_w) <= dialog_w * 0.35
