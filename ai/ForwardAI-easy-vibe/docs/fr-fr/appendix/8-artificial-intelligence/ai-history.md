---
title: 'Une brève histoire de l''IA : de la logique symbolique aux grands modèles à milliards de paramètres'
description: 'En 70 ans, l''IA a traversé trois vagues et deux hivers, pour finalement converger vers l''ère des grands modèles d''aujourd''hui.'
---

# Une brève histoire de l'IA : de la logique symbolique aux grands modèles à milliards de paramètres

En 70 ans de développement, l'IA a traversé **trois vagues et deux hivers**, passant du raisonnement logique du symbolisme, aux réseaux de neurones du connexionnisme, puis à l'apprentissage par renforcement du behaviorisme, pour finalement converger vers l'ère des grands modèles d'aujourd'hui. Comprendre l'histoire de l'IA nous aide à saisir la nature de l'« intelligence » des grands modèles actuels.

<AiEvolutionDemo />
<DiscriminativeVsGenerativeDemo />

---

## 1. Les fondations théoriques et la naissance du symbolisme (années 1940-1950)

Avant même la généralisation des ordinateurs, des pionniers s'interrogeaient déjà : « Une machine peut-elle penser comme un humain ? » Les recherches de cette époque se concentraient principalement sur la modélisation mathématique des neurones cérébraux, l'exploration de la théorie du calcul et l'automatisation du raisonnement logique. La conférence de Dartmouth en 1956 a officiellement proclamé la naissance de l'« Intelligence Artificielle » (Artificial Intelligence) en tant que discipline indépendante.

<FoundationDemo />

### 1.1 Théories fondamentales et jalons historiques

- **La première ébauche des réseaux de neurones (1943)** : Le neurophysiologiste Warren McCulloch et le mathématicien Walter Pitts ont proposé le **modèle du neurone MP**. Ils ont tenté pour la première fois d'abstraire le mécanisme de fonctionnement des neurones du cerveau humain par une formule mathématique simple, démontrant qu'« un réseau de neurones peut être calculable », ce qui est devenu l'ancêtre de tous les réseaux profonds d'aujourd'hui.
- **La question ultime de Turing (1950)** : Alan Turing, le père de l'informatique, a publié un article qui a changé l'histoire, « Computing Machinery and Intelligence », dans lequel il proposait le célèbre **test de Turing**. Il y esquive le débat philosophique sur « ce qu'est l'intelligence » et propose un critère opérationnel pragmatique : si une machine, lors d'une conversation, rend impossible pour un humain de distinguer si elle est humaine ou machine, alors elle possède une intelligence.
- **La reconnaissance officielle de la discipline (1956)** : Lors du séminaire d'été de Dartmouth, de jeunes chercheurs tels que John McCarthy et Marvin Minsky se sont réunis. McCarthy a utilisé pour la première fois le terme « Artificial Intelligence » dans sa proposition, faisant de cette année l'an zéro de l'IA.

::: tip L'essor du symbolisme
Dans les premières recherches en IA, le **symbolisme** occupait une position absolument dominante. Comme les ordinateurs de l'époque fonctionnaient principalement avec des circuits logiques, les chercheurs pensaient naturellement que **l'essence de l'intelligence résidait dans la manipulation de symboles**.
Il suffisait de transformer les connaissances du monde en symboles compréhensibles par l'ordinateur (concepts, règles), puis d'utiliser un moteur d'inférence logique (comme les règles SI-ALORS) pour traiter ces symboles, et la machine pourrait penser comme un humain. Il s'agissait d'une approche **descendante (top-down)**, fortement dépendante de l'apport de connaissances par des experts humains.
:::

---

## 2. L'âge d'or du symbolisme et la première vague de l'IA (années 1960-1970)

Dans la première décennie qui a suivi sa naissance, l'IA a connu une période d'optimisme aveugle. Les chercheurs croyaient que, puisque les machines pouvaient déjà prouver des théorèmes mathématiques, il ne restait plus qu'un pas avant d'écrire des programmes capables de résoudre n'importe quel problème humain.



### 2.1 L'âge d'or des systèmes experts

L'aboutissement du symbolisme fut les **systèmes experts (Expert Systems)**. En fournissant à l'ordinateur les « règles empiriques (rules) » des plus grands experts de chaque domaine, le système pouvait effectuer des diagnostics ou prendre des décisions de haut niveau dans certains secteurs verticaux spécifiques.

| Système expert | Année de création | Signification historique et valeur pratique |
| --- | --- | --- |
| **Dendral** | 1965 | **Le premier système expert**, capable de déduire la structure moléculaire chimique à partir de données de spectrométrie de masse, avec des performances comparables à celles des chimistes humains. |
| **MYCIN** | 1977 | Utilisé pour diagnostiquer les infections sanguines et recommander des antibiotiques, avec un taux de précision atteignant 69 %, surpassant même de nombreux médecins non spécialistes de l'époque. |
| **XCON** | 1980 | Le premier système expert commercial à succès, utilisé pour aider Digital Equipment Corporation (DEC) à configurer automatiquement les systèmes informatiques selon les besoins des clients, permettant à l'entreprise d'économiser 40 millions de dollars par an. |

Cependant, derrière le succès des systèmes experts se cachait un gouffre infranchissable.

### 2.2 Le premier hiver de l'IA (1974-1980)

Avec le temps, on s'est rendu compte que « traduire la connaissance humaine en règles » menait à une impasse. Les trois limites fatales du symbolisme ont finalement conduit à la suppression complète des financements de la recherche :

**Le goulot d'étranglement de l'acquisition des connaissances** : certaines connaissances, les humains eux-mêmes ne savent pas les expliquer (par exemple, comment reconnaître un chat), ce qu'on appelle le « paradoxe de Polanyi ». Les systèmes experts ne pouvaient encoder en dur que les règles exprimables clairement, sans capacité d'apprentissage automatique.

**L'explosion combinatoire et la fragilité** : les situations réelles sont trop nombreuses, l'énumération exhaustive est quasi impossible ; de plus, l'absence de sens commun faisait que le système s'effondrait dès qu'on s'écartait légèrement de la base de règles.

**La puissance de calcul insuffisante et la rupture des financements** : le matériel de l'époque était incapable de soutenir l'explosion des inférences logiques, et les subventions de recherche de la DARPA ont été massivement réduites.

---

## 3. Les systèmes experts (des programmes traduisant l'expérience humaine en code) et la deuxième vague de l'IA (années 1980)

Dans les années 80, avec la généralisation des micro-ordinateurs et des machines LISP spécialisées, les systèmes experts ont de nouveau suscité l'engouement du monde des affaires. Le gouvernement japonais a même lancé l'ambitieux « projet d'ordinateur de cinquième génération », visant à créer des machines intelligentes capables de comprendre le langage naturel, déclenchant une vague d'investissements paniques à l'échelle mondiale.

### 3.1 L'explosion et l'effondrement des applications commerciales

À cette époque, presque toutes les grandes multinationales développaient leur propre **système expert (un programme traduisant l'expérience des experts humains en des milliers de lignes de code SI-ALORS)**. Cependant, la maintenance de ces systèmes est devenue extrêmement pénible. Une fois la base de règles dépassant plusieurs dizaines de milliers d'entrées, la modification d'une nouvelle règle entraînait souvent des conflits avec dix autres règles existantes. Avec l'explosion des performances des ordinateurs personnels (PC) grand public à la fin des années 80, les machines d'IA spécialisées, coûteuses et fermées, ont perdu toute compétitivité.

::: warning ❄️ Le deuxième hiver de l'IA (1987-1993)
En 1987, le marché du matériel d'IA s'est complètement effondré. Le « projet d'ordinateur de cinquième génération », trop déconnecté de l'architecture matérielle réelle, a fini par être abandonné. Les investissements des entreprises dans les systèmes experts sont partis en fumée, la recherche en IA a de nouveau touché le fond, et le terme « intelligence artificielle » est même devenu un mot péjoratif dans le milieu universitaire, synonyme d'escroquerie aux subventions.
:::

### 3.2 Le connexionnisme en sommeil dans l'obscurité

Au cours de ces deux vagues successives, une approche complètement différente existait déjà — le **connexionnisme (Connectionism)**, c'est-à-dire ce que nous appelons aujourd'hui les **réseaux de neurones**.

<PerceptronDemo />

Le connexionnisme avait été proposé dès 1958 par Frank Rosenblatt sous la forme du **perceptron (Perceptron)**. Il simulait le cerveau en ajustant les poids des connexions entre les neurones pour apprendre. Plutôt que d'enseigner à la machine des « règles » explicites, il valait mieux lui montrer un grand nombre d'« exemples » et la laisser généraliser par elle-même. Cependant, en 1969, Minsky démontra rigoureusement dans son livre « Perceptrons » les limites des réseaux monocouches de l'époque (incapacité à résoudre le simple problème du OU exclusif). Cela relégua le connexionnisme au second plan pendant tout l'âge d'or du symbolisme. Jusqu'à ce que la roue de l'histoire avance vers les années 90.

---

## 4. L'essor de l'apprentissage automatique et la renaissance du connexionnisme (années 1990-2000)

À partir des années 90, un virage pragmatique important est apparu dans le domaine de l'IA. On a cessé de parler quotidiennement de réaliser une « intelligence magique semblable à celle des humains » pour se concentrer sur la manière d'utiliser des **méthodes statistiques rigoureuses** pour résoudre des problèmes concrets de classification et de prédiction. C'est ainsi qu'est né l'**apprentissage automatique (Machine Learning)** traditionnel.

### 4.1 Des règles rigides à la « recherche de frontières mathématiques »

En 1997, bien qu'IBM avec « Deep Blue » ait battu le champion du monde d'échecs Garry Kasparov, offrant au symbolisme une victoire éclatante et retentissante, le monde académique a immédiatement compris qu'il ne s'agissait que d'une victoire de « puissance de calcul + énorme encodage en dur » : Deep Blue ne comprenait pas vraiment ce qu'était jouer aux échecs.

Parallèlement, les algorithmes classiques d'apprentissage automatique, représentés par les **machines à vecteurs de support (SVM)**, les arbres de décision et les forêts aléatoires, ont émergé avec force et sont devenus la norme absolue pendant plus d'une décennie.

Si les anciens systèmes experts enseignaient à l'ordinateur : « Si un email contient "gagnant", alors c'est du spam », la **logique de l'apprentissage automatique** était la suivante : l'humain définit d'abord quelques caractéristiques essentielles **(feature engineering)**, comme « la longueur de l'email », « la fréquence des mots spéciaux », « la fiabilité de l'expéditeur », puis il fournit à l'ordinateur des dizaines de milliers d'emails étiquetés. Dans cet espace multidimensionnel, la **machine à vecteurs de support (SVM)** agit comme un mathématicien muni d'une règle : elle utilise des fonctions noyau rigoureuses pour tracer, entre les emails normaux et les spams, la « ligne de démarcation mathématique la plus large et la plus sûre ».

Bien que les SVM aient obtenu des succès remarquables dans de nombreuses tâches, elles souffraient d'une faiblesse fatale : le **feature engineering était fortement dépendant de l'humain**. Par exemple, pour reconnaître l'image d'un chat, les scientifiques humains devaient apprendre à la machine à « d'abord extraire les contours », « puis chercher les oreilles triangulaires » — la machine ne pouvait pas trouver le chat par elle-même ! Cela signifiait que le plafond des capacités du modèle était fermement verrouillé par la cognition humaine.

### 4.2 La rétropropagation redonne vie aux réseaux de neurones

Les véritables fondations de l'apprentissage profond ont été posées durant cette période :

<BackpropagationDemo />

Pendant cette période de dormance, Geoffrey Hinton et d'autres ont clarifié davantage la valeur centrale de la **rétropropagation (Backpropagation)** : lorsque le réseau de neurones multicouche produit une prédiction erronée, il peut rétropropager cette erreur comme une onde, couche par couche, pour indiquer à chaque neurone caché : « Quelle est ta part de responsabilité dans cette erreur, et corrige-toi la prochaine fois ! »

Cela a finalement brisé les carcans imposés aux réseaux de neurones depuis les années 60, rendant possibles les réseaux à couches cachées. Mais à l'époque, avec trop peu de données et un matériel trop faible (pas même une bonne carte graphique), les réseaux de neurones ne pouvaient pas encore surpasser complètement les modèles d'apprentissage automatique traditionnels comme les SVM. Jusqu'à la convergence des **trois déclencheurs majeurs**.

---

## 5. La révolution de l'apprentissage profond et la domination du connexionnisme (années 2010)

Dans les années 2010, avec la **maturation du Big Data (comme le projet ImageNet)**, l'**explosion de la puissance de calcul (utilisation massive des GPU pour le calcul parallèle)** et les **améliorations algorithmiques (résolution du problème de disparition du gradient)**, l'« apprentissage profond » a ouvert en fanfare la troisième vague de l'IA.

**Quelle est la différence essentielle entre l'apprentissage profond et l'apprentissage automatique traditionnel ? Le signe distinctif est : l'extraction automatique des caractéristiques (apprentissage de représentations).** Pourvu que le réseau soit suffisamment profond (des dizaines à des centaines de couches), le réseau de neurones peut ingérer directement les pixels bruts : ses couches inférieures apprennent toutes seules à reconnaître les lignes, les couches intermédiaires apprennent à reconnaître les textures de poils, et les couches supérieures reconnaissent directement qu'il s'agit d'un « chat ». Dans cette révolution, l'humain arrogant a finalement lâché prise, laissant le réseau trouver par lui-même les caractéristiques visuelles, vocales et textuelles les plus importantes.

### 5.1 Percées décisives en vision par ordinateur et en compétition

En 2012, **AlexNet (le réseau de neurones convolutif CNN classique)**, développé par l'équipe dirigée par Hinton, a participé au célèbre concours de classification d'images ImageNet. Alors que les autres peinaient encore à extraire manuellement des caractéristiques visuelles avec des méthodes traditionnelles, AlexNet a réduit de façon fulgurante le taux d'erreur de 26 % à 15,3 %, stupéfiant tout le milieu de la vision par ordinateur classique. En raison de cette domination absolue, dans les années qui ont suivi, presque aucun article n'utilisant pas l'apprentissage profond n'a pu être accepté dans les conférences de premier plan !

Les années suivantes, la technologie de l'IA a progressé à une vitesse fulgurante :

<NeuralNetworkVisualizationDemo />

| Année de percée | Accomplissement marquant | Impact profond |
| --- | --- | --- |
| **2014** | Proposition des **GAN (Generative Adversarial Networks)** | Deux réseaux « s'affrontant mutuellement » (l'un crée des faux, l'autre les détecte), permettant à l'IA de générer des images étonnamment réalistes. |
| **2015** | Apparition de **ResNet (Residual Network)** | Introduction innovante de structures de « raccourci », résolvant le problème où les réseaux plus profonds ne pouvaient tout simplement plus être entraînés correctement, permettant d'empiler des centaines, voire des milliers de couches. |
| **2016** | **AlphaGo** bat Lee Sedol | L'apogée de la combinaison de l'apprentissage profond et de l'**apprentissage par renforcement**, brisant l'affirmation selon laquelle « la machine ne battra jamais l'humain au jeu de Go », provoquant une onde de choc mondiale. |

::: tip Behaviorisme et apprentissage par renforcement
AlphaGo représentait la victoire d'une autre école de pensée — le **behaviorisme**. Selon cette approche, l'intelligence naît de l'interaction dynamique entre l'agent et son environnement, comme lorsqu'on dresse un chiot à s'asseoir : il est récompensé quand il réussit, puni quand il échoue. En s'entraînant par essais-erreurs dans un vaste environnement virtuel, en jouant des parties contre lui-même, AlphaGo a découvert des stratégies que même les meilleurs joueurs humains n'avaient jamais envisagées.
:::

### 5.2 Transformer : le berceau des grands modèles

En 2017, les rouages du destin se sont mis en marche. Google a proposé dans son article « Attention Is All You Need » une toute nouvelle architecture d'apprentissage profond — le **Transformer**.

<AttentionMechanismDemo />

Auparavant, pour traiter une phrase (avec des modèles comme les RNN), l'IA ne pouvait lire les mots qu'un par un, de gauche à droite, et avait tendance à oublier le début en arrivant à la fin. Le mécanisme d'**auto-attention (Self-Attention)** du Transformer a complètement brisé cette limitation : il permet à l'IA de « voir d'un seul coup » toute la phrase, et lorsqu'elle rencontre le mot « pomme », de déterminer automatiquement, selon le contexte, s'il s'agit du fruit ou de l'entreprise de Steve Jobs.

Naturellement adapté au calcul parallèle, capable d'ingérer des quantités illimitées de données et pouvant être empilé à l'infini — c'est à ce moment précis que les fondations des grands modèles de langage (LLM) ont été posées.

---

## 6. L'ère des grands modèles et l'aube de l'intelligence générale (2018 à aujourd'hui)

Lorsque le Transformer a rencontré une puissance de calcul démesurée et des volumes de données massifs, le paradigme historique du développement de l'IA a été changé à jamais. Les scientifiques ont découvert un phénomène stupéfiant : l'architecture basée sur l'auto-attention semblait littéralement « insatiable ». Les anciens modèles d'apprentissage profond voyaient leur intelligence plafonner à un certain niveau, mais le Transformer s'adapte parfaitement au calcul parallèle massif des GPU : plus on lui donne de données et plus on approfondit ses couches, plus ses performances s'améliorent, sans limite apparente.

### 6.1 L'établissement du paradigme « pré-entraînement + fine-tuning » : du spécialiste au généraliste

À l'origine, pour faire de l'IA, on adoptait l'approche « un petit modèle par tâche » : un modèle spécifique pour la traduction, un autre pour la conversation, comme si on formait des « spécialistes » ne maîtrisant qu'un seul métier. Mais à partir de 2018, avec la sortie de **GPT-1** par OpenAI et de **BERT** par Google, la situation a basculé vers un nouveau paradigme : **« la force brute fait des miracles »**.

D'abord vient le **pré-entraînement (Pre-training)**, qui constitue 99 % de l'intelligence fondamentale des grands modèles de langage. Les scientifiques ont déversé dans les immenses réseaux Transformer des billions de mots issus d'articles, de livres classiques, de code informatique et même d'encyclopédies accumulés par l'humanité sur Internet. Et la tâche d'entraînement qui leur était donnée était simplement le modeste **« jeu de prédiction du mot suivant » (next token prediction)**.

Pour prédire avec une précision inouïe les divers « mots suivants » du langage humain, le modèle a été contraint d'intérioriser et de condenser, dans ses milliards de paramètres neuronaux, les lois de fonctionnement du monde entier ! Il a non seulement parfaitement maîtrisé la grammaire sujet-verbe-complément, appris qu'une « pomme » est un fruit rouge, mais il a aussi saisi la logique sous-jacente selon laquelle « Newton a découvert la gravitation universelle parce qu'une pomme est tombée ». C'est comme un enfant qui, sans jamais avoir mémorisé consciemment un livre de grammaire, acquiert automatiquement la capacité de comprendre un monde complexe en lisant des millions de livres.

<GPTEvolutionDemo />

De GPT-2 (1,5 milliard de paramètres) à GPT-3 (175 milliards de paramètres), les scientifiques ont découvert avec stupeur les **capacités émergentes (Emergent Abilities)** — lorsque le modèle devient suffisamment grand, le changement quantitatif provoque un changement qualitatif saisissant. Même sans aucun entraînement spécifique, les modèles aux paramètres gigantesques ont « compris » par eux-mêmes le raisonnement logique, l'écriture de code et l'apprentissage contextuel (in-context learning). Nul besoin que les humains leur enseignent cela explicitement par du code.

### 6.2 L'explosion de l'IA générative et le moment détonateur de ChatGPT

Après avoir obtenu un immense modèle pré-entraîné, imprégné de connaissances encyclopédiques et doté de sens commun mondial, il restait une dernière étape pour créer l'assistant IA personnel parfait : le **fine-tuning (ajustement fin)**. Car le modèle pré-entraîné n'était habitué qu'à compléter aveuglément du texte : il ne comprenait pas les « instructions » de l'utilisateur et ne savait pas comment interagir de façon ordonnée en questions-réponses.

En novembre 2022, OpenAI a ingénieusement introduit la technique du **RLHF (Reinforcement Learning from Human Feedback)**. Ils ont embauché de nombreux experts pour noter et corriger les réponses du modèle. C'était comme imposer à un génie extrêmement brillant mais sans filtre des règles claires de communication et des normes de politesse, le façonnant de force en un assistant conversationnel doux, structuré et raisonnable. Ainsi naquit **ChatGPT**.

Du jour au lendemain, l'IA n'était plus un jouet de laboratoire ennuyeux, mais un cerveau intelligent universel à la portée de chaque personne ordinaire.

S'ensuivit alors une ère multimodale grandiose :
* **2023 : L'éveil des sens multiples.** Des modèles de génération d'images comme Midjourney et Stable Diffusion ont remodelé l'industrie de l'art numérique. La même année, **GPT-4** a intégré la compréhension d'images visuelles d'une difficulté extrême avec des capacités de raisonnement logique à longue portée.
* **De l'explosion de 2024 à aujourd'hui : La simulation du monde physique.** Avec la sortie de modèles de génération vidéo réalistes comme Sora, et le déploiement complet de grands modèles vocaux de bout en bout en temps réel capables de transmettre les nuances émotionnelles du ton, l'IA est rapidement passée du traitement textuel à la perception complète d'un monde intégrant l'espace tridimensionnel, les jeux d'ombre et de lumière, et même les subtilités des intonations affectives.

---

## 7. La convergence des trois écoles de l'IA et les perspectives d'avenir

En revenant sur ces 70 années — de la machine qui raisonne sur des théorèmes mathématiques (symbolisme), à la recherche de frontières statistiques (apprentissage automatique traditionnel), à la victoire au jeu de Go par essais-erreurs (behaviorisme/apprentissage par renforcement), puis aux grands modèles qui émergent avec du sens commun en ingérant des masses de données (la forme ultime du connexionnisme) — le développement de l'intelligence artificielle ne s'est jamais arrêté.

Les grands modèles d'aujourd'hui semblent avoir abandonné l'encodage manuel de « règles » rigides (l'objectif initial du symbolisme), mais en réalité, dans les milliards de paramètres implicites de leurs milliers de couches de réseau, ils ont appris et encapsulé des « règles implicites » bien plus profondes que la logique humaine. La méthode de raisonnement à longue portée par **chaîne de pensée (Chain of Thought)** dans les grands modèles pré-entraînés d'aujourd'hui n'est-elle pas la renaissance, au sein des réseaux de neurones, de l'idée classique chère à l'école symbolique de la vérification logique et de la rigueur des étapes ?

**Du sommet de l'ère des grands modèles, l'intelligence artificielle générale (AGI) du futur progresse le long de plusieurs voies d'exploration extrêmement vastes et profondes :**

1. **Vers un noyau neuronal unifié natif (multimodalité native) :** Les modèles du futur ne seront plus des créatures à la Frankenstein assemblées à partir d'un « modèle de texte + modèle vocal ». Les architectures comme GPT-4o utilisent directement un seul et même super-réseau pour ingérer, percevoir et comprendre simultanément le texte, les images, les flux vidéo et la parole en trois dimensions à très faible latence et riche en émotions.
2. **L'intelligence incarnée (Embodied AI) :** Lorsqu'un « cerveau » doté d'une intelligence extrêmement élevée reste enfermé dans une salle de serveurs en silicium, il ne peut pas vérifier la vérité dans le monde physique. En s'associant à Boston Dynamics et aux robots humanoïdes, la super IA pourra se doter de mains et, en tombant et en se relevant, apprendra exactement les mêmes lois objectives et physiques que nous.
3. **Les systèmes agentifs (Agentic AI) :** Actuellement, la plupart des LLM restent au stade de « calculateurs de texte passifs en questions-réponses ». Mais à l'ère des agents IA, les grands modèles se voient conférer le **pouvoir d'agir de manière autonome**. Il suffit de donner une instruction en langage naturel (« Aide-moi à rechercher et planifier tous les vols et hôtels pour voir les aurores boréales en Norvège la semaine prochaine, et crée un calendrier »), et l'agent IA, s'appuyant sur sa mémoire à long terme, décomposera de façon autonome des dizaines de sous-tâches, ouvrira un navigateur virtuel, appellera les API de recherche de vraies compagnies aériennes, et effectuera des vérifications complexes et des comparaisons. Ils ne sont plus des échos passifs attendant d'être frappés, mais des cohortes infatigables de main-d'œuvre numérique.

Dans cette longue odyssée technologique en spirale ascendante, l'histoire est toujours étonnamment similaire mais ne se répète jamais. Nous vivons en direct la section historique la plus palpitante, celle du passage de « l'entrée rigide de règles dans les algorithmes » à « la définition automatique des lois du monde par la machine ».

<AIErasComparisonDemo />
