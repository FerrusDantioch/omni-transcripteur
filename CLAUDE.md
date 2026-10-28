# CLAUDE.md — Règles du projet Omni-Transcripteur

Ce fichier est lu par Claude au début de chaque session. Il résume les règles
de travail à respecter sur ce projet.

## Le projet

**Omni-Transcripteur** est une application web installable (PWA) qui transforme la
voix en texte, entièrement dans le navigateur.

Feuille de route :
1. Transcrire une voix (micro ou fichier audio).
2. Reconnaître jusqu'à 6 voix différentes (« Intervenant 1 », « Intervenant 2 »…).
3. Générer des sous-titres pour des vidéos (fichiers `.srt` et `.vtt`).
4. Plus tard : publication sur le Google Play Store.

## L'utilisateur

- Débutant complet en programmation.
- **Toujours parler en français**, simplement, et expliquer chaque terme technique.
  Cela vaut pour **tous** les messages, y compris les petites phrases
  d'avancement pendant le travail (rappel de l'utilisateur).
- Les **commentaires dans le code sont en français**.
- Les **messages de commit sont en français**.

## Contraintes techniques (à ne pas oublier)

- **Aucun serveur** : tout tourne dans le navigateur, gratuitement, sans clé d'API payante.
- **Transcription locale** sur l'appareil avec Whisper via Transformers.js
  (protège la vie privée : l'audio ne quitte jamais le téléphone).
- **Hors ligne** : le modèle se télécharge une seule fois, puis l'application
  fonctionne sans internet. Toujours afficher une **barre de progression claire**
  pendant le téléchargement. La connexion de l'utilisateur est parfois instable :
  prévoir les coupures (reprise, messages d'erreur compréhensibles).
- **Mobile d'abord** : appareil cible = Android (Redmi Note 15), navigateur Chrome.
  Gros boutons, textes lisibles, contrastes forts, interface sobre et calme,
  pas d'animations agressives.
- **Langue de l'interface** : français. **Transcription** : français par défaut,
  avec choix d'autres langues.
- **Hébergement** : GitHub Pages (site statique). Compte GitHub : `FerrusDantioch`.
- **Technologies** : HTML, CSS, JavaScript simple (modules ES). Pas de framework
  lourd. Pas d'outil de compilation, sauf si indispensable — et dans ce cas,
  expliquer pourquoi avant de l'ajouter.
- **Organisation** : petits fichiers clairs, un dossier par responsabilité.

## Méthode de travail

1. **Avant de coder**, écrire un court plan en français et **attendre l'accord**
   de l'utilisateur.
2. Avancer par **petites étapes testables**. Après chaque étape, expliquer
   **exactement comment tester** (quoi ouvrir, sur quoi cliquer, ce qu'on doit voir).
3. Faire des **commits Git fréquents**, avec des messages en français.
   **Branches** : `main` = version publiée sur GitHub Pages. Le travail se fait
   sur la branche de travail de la session ; à la fin de chaque étape testée,
   mettre aussi `main` à jour (`git push origin <branche>:main`), sans demander
   (choix « Option A » de l'utilisateur), puis lui dire comment tester.
   Le Mode JDR « capture en direct » a été développé sur la branche séparée
   `capture-discord` (demande de l'utilisateur), publiée aussi sur `main`.
   Pour toute suite de travail, repartir de `main` (qui contient tout).
4. Si un choix technique est **risqué ou limité** (ex. performances sur téléphone),
   le dire honnêtement et proposer une alternative.

## Organisation des fichiers

```
index.html                 page unique de l'application
manifest.json              fiche d'identité de la PWA (nom, icônes, couleurs)
sw.js                      service worker (hors ligne + en-têtes COOP/COEP) — doit rester à la racine
.nojekyll                  dit à GitHub Pages de publier les fichiers tels quels
css/style.css              styles (thème clair/sombre automatique)
js/app.js                  point d'entrée : relie toutes les parties
js/config.js               qualités, langues, moteurs (constantes)
js/pwa/                    installation et enregistrement du service worker
js/stockage/               IndexedDB (historique, téléchargements) et réglages
js/audio/                  micro, décodage des fichiers, découpage en morceaux
js/transcription/          Web Worker (Whisper), téléchargement avec reprise, assemblage du texte
js/interface/              une « carte » de l'écran par fichier + textes des messages
js/outils/                 mise en forme, écran allumé
js/voix/                   reconnaissance des intervenants (analyse, regroupement, attribution)
js/capture/                Mode JDR, capture en direct sur ordinateur (AudioWorklet, pistes, transcription)
modeles/voix/              modèles de voix hébergés avec l'app (pyannote + WeSpeaker, ≈ 32 Mo, voir son README)
vendor/transformers/       Transformers.js + ONNX Runtime copiés depuis npm (voir son README)
icons/                     icônes 192 et 512 px (« any » et « maskable »)
```

## Règles à ne pas oublier

- **Chemins toujours relatifs** (`./css/style.css`, jamais `/css/style.css`) :
  le site est publié dans un sous-dossier sur GitHub Pages.
- **À chaque modification d'un fichier de l'application**, augmenter
  `VERSION_CACHE` dans `sw.js` (v2 → v3…), sinon les téléphones gardent
  l'ancienne version. Tout nouveau fichier doit aussi être ajouté à la
  liste `FICHIERS_APPLICATION` de `sw.js`.
- **Nouvelle version : jamais par surprise.** Elle attend un appui sur
  « Mettre à jour » (`#carte-mise-a-jour`, gérée dans
  `js/pwa/register-service-worker.js`), refusé pendant un enregistrement ou
  une transcription. Pas de `self.skipWaiting()` dans l'installation de
  `sw.js` (seulement au message `{ type: "activer" }`). Le rechargement
  unique de la toute première installation (COOP/COEP) reste inchangé.
- **Transformers.js et ONNX Runtime** : les versions dans `vendor/` doivent aller
  ensemble (voir `vendor/transformers/README.md`). Si on change la version
  d'ONNX Runtime, changer aussi `CACHE_MOTEUR` dans `js/transcription/worker.js`.
- **Langue** : Transformers.js v4 ne détecte pas la langue (anglais par défaut) :
  toujours passer `language`.
- **Garde-fous Whisper** (worker) : `no_repeat_ngram_size` et `max_new_tokens`
  évitent les boucles « mot mot mot… » et les recalculs très longs. Ne pas les retirer.
- **Compression (dtype)** : dans `js/transcription/worker.js`, l'encodeur est
  donné sous deux noms (`model` et `encoder_model`) : la bibliothèque n'utilise
  pas le même nom pour lister les fichiers et pour les charger (défaut de
  Transformers.js 4.3.0). Ne pas retirer ce doublon.
- **Qualité du texte** (retour de l'utilisateur) : « Équilibré » (base, encodeur
  compressé q8) fait pas mal d'erreurs → ajout de « Équilibré + » (encodeur
  non compressé fp32). Résultat à confirmer sur le téléphone.
  ✅ Mesuré par l'utilisateur sur son Redmi : « Précis » (whisper-small q8) donne
  une transcription nettement meilleure, sans ralentir le téléphone ; environ
  2 à 3 min de calcul pour 30 s d'audio (soit 4 à 6 fois la durée de l'audio).
- **Messages d'erreur** : un code par type d'erreur (`js/transcription/erreurs.js`),
  texte rassurant correspondant dans `js/interface/messages.js`.

## Comment Claude teste (environnement cloud)

- `huggingface.co` est bloqué par le réseau de l'environnement cloud : on ne peut pas
  y télécharger les vrais modèles. Pour les tests, Playwright (Chromium) intercepte
  les requêtes vers Hugging Face et sert une copie de Whisper tiny (paquet npm
  `sts-whisper-tiny`, utilisé seulement pour les tests, jamais dans l'application).
- Voix de test : `espeak-ng` (voix de synthèse, très mal reconnue par Whisper tiny :
  la qualité du texte doit être jugée sur une vraie voix, sur le téléphone).
- Le site est servi dans un sous-dossier (`/omni-transcripteur/`) comme sur GitHub Pages.
- Voix multiples : dialogues fabriqués avec plusieurs voix espeak-ng (fr+m3, fr+f3,
  fr+m7, fr+f5), en notant qui parle quand, pour mesurer l'attribution.
- Ne jamais lancer `pkill -f motif` dans une commande qui contient ce motif
  (la commande se tue elle-même).

## Points de vigilance connus

- **Performances sur téléphone** : utiliser de petits modèles Whisper
  (`tiny` ou `base`, version « quantifiée » = compressée). Les gros modèles
  sont trop lents ou trop lourds en mémoire sur mobile.
- **Téléphone figé** (retour de l'utilisateur, Redmi, qualité Équilibré, moteur
  « Automatique ») : la carte graphique et 4 cœurs à fond figeaient l'écran.
  Depuis : moteur « Processeur » et vitesse « Douce » (2 cœurs) par défaut,
  pause de 300 ms entre les morceaux. Le modèle n'est plus chargé à l'ouverture :
  état « disponible » (téléchargé) → chargé seulement au moment de transcrire
  (`attendreModelePret()` dans `js/app.js`), puis libéré après 5 min sans usage
  (le worker est arrêté).
  ✅ Confirmé par l'utilisateur sur son Redmi : fluidité correcte avec ces réglages.
  Ne pas revenir à « Automatique » / 4 cœurs par défaut. Le nombre de cœurs ne peut être choisi
  qu'au démarrage du worker : en changer = relancer un worker neuf.
- **GitHub Pages** ne permet pas de régler les en-têtes HTTP COOP/COEP qui
  permettent le calcul multi-cœurs : c'est `sw.js` qui les ajoute (la page se
  recharge une fois toute seule à la première visite).
- **Micro** : le navigateur n'autorise le micro que sur une page sécurisée
  (`https://` ou `http://localhost`).
- **Reconnaissance des intervenants (étape 2)** — option A choisie par l'utilisateur :
  pyannote segmentation 3.0 (qui parle quand, fenêtres de 10 s) + empreintes
  WeSpeaker ResNet34 + regroupement maison (`js/voix/regroupement.js`, seuil
  pyannote 3.1, échantillon de 300 passages au-delà pour rester rapide : 3 h ≈ 0,3 s).
  Modèles hébergés dans `modeles/voix/` (ONNX de sherpa-onnx, non modifiés) et
  chargés via Transformers.js en changeant `env.remoteHost` le temps du chargement.
  Ils ne se chargent qu'APRÈS Whisper (le moteur démarre ainsi avec 2 cœurs).
  En cas d'échec : repli sur le texte sans distinction de voix (jamais de perte).
  Tests (voix de synthèse espeak) : interview 2 voix 10/10 ; JDR 4 voix 11-13/14
  (les voix de synthèse masculines se confondent). Analyse ≈ 10-15 % de la durée
  de l'audio sur ordinateur (1 cœur). Usages : interviews et séances de JDR (≤ 3 h).
- **Mode JDR, capture en direct** (branche `capture-discord`, publiée aussi sur `main`) :
  ordinateur seulement (Chrome/Edge). `getDisplayMedia` (son du système ou d'un onglet ;
  l'image est imposée par Chrome mais ignorée) + `getUserMedia` (micro), réunis dans un
  AudioContext à 16 kHz → `js/capture/processeur-capture.js` (AudioWorklet, 2 entrées,
  0 sortie) → son brut Int16, blocs de 5 s dans IndexedDB (tiroirs `captures` et
  `blocs-capture`, base en version 2). Pas de MediaRecorder : décoder 3 h compressées
  saturerait la mémoire. Une capture « en cours » sans verrou Web Locks = interrompue.
  Transcription APRÈS la session (`js/capture/transcrire-capture.js`) : piste micro =
  intervenant 0 (nom du joueur), piste « autres » = diarisation, fusion par l'heure ;
  avancement sauvegardé après chaque morceau (reprise). `PisteAudio` imite un AudioBuffer
  (`extraireMono` appelle sa méthode `extraire`).
  Sur Android : impossible (même une appli native ne peut pas capter le son d'un appel).
  Tests : faux partage (`FAUX_PARTAGE` dans les tests) avec deux pistes espeak
  (`session-moi.wav`, `session-autres.wav`) : 12/12 répliques sur la bonne piste,
  synchronisation à 50 ms près, 10 s retrouvées sur 14 s après fermeture brutale.
  Diarisation de la piste « autres » (3 voix) : 6/7 avec le nombre exact, 4/7 en automatique.
- **Attribution des intervenants** : les segments de Whisper sont découpés en phrases
  AVANT l'attribution (`decouperEnPhrases`) : deux personnes dans un même segment
  retrouvent chacune leur voix (test : interview 10/10 au lieu d'une seule voix).
- **Whisper sans aucun mot** sur un morceau : la bibliothèque plante
  (« token_ids must be a non-empty array ») → intercepté dans le worker (morceau ignoré).

## Champ `id` du manifeste : nom du dossier, jamais `./`

`manifest.json` contient `"id": "/omni-transcripteur/"`. Chrome résout `id` par rapport à
la **racine du domaine** (`https://ferrusdantioch.github.io/`), pas par
rapport au dossier de l'application : `"id": "./"` (ou `"."`) donnait donc
l'identité de la racine du site, la même pour toutes les applications qui
l'utilisaient. C'est une exception voulue à la règle des chemins relatifs.

Ne plus changer cette valeur : pour Chrome, une application déjà installée
dont l'`id` change devient une autre application (il faut la désinstaller
puis la réinstaller pour qu'elle reprenne les mises à jour).

Exception unique (octobre 2026) : l'application s'appelait « Transcriptor » et
vivait à `/Transcriptor/`. Le renommage du dépôt a changé son adresse,
donc son `id` : les personnes qui l'avaient installée doivent la réinstaller
depuis la nouvelle adresse (leurs données restent, le stockage n'a pas changé).

## ⚠️ Plusieurs applications sur `ferrusdantioch.github.io` : limite de Chrome Android

Toutes les applications du portfolio partagent la même adresse d'origine
(`ferrusdantioch.github.io`). Constaté en octobre 2026 sur le téléphone de
l'utilisateur : **Chrome Android n'accepte d'installer qu'une seule de ces
applications**. Dès qu'une est installée, les autres affichent « Cette appli
est déjà installée », même avec des `id` et des `scope` tous différents
(corriger l'`id`, ci-dessus, n'a pas suffi). **Brave installe toutes les
applications sans problème** : ce n'est pas un défaut des applications.

Contournements : installer depuis Brave, ou choisir « Créer un raccourci »
dans Chrome (l'application s'ouvre alors dans un onglet Chrome). Solution
durable si l'application doit être distribuée : une adresse (origine)
distincte par application (Cloudflare Pages, Netlify, sous-domaine d'un nom
de domaine, organisation GitHub…). À savoir aussi : une même origine
signifie stockage (IndexedDB, localStorage) et autorisations (micro,
notifications) partagés entre toutes ces applications.
