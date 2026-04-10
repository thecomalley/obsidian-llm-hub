# Recherche RAG

L'onglet **Recherche RAG** offre une interface dédiée pour la recherche vectorielle sémantique, le filtrage par mots-clés, l'édition des chunks, et l'envoi des résultats vers Chat ou Discussion.

![Recherche RAG](images/rag-search.png)

## Recherche

1. Sélectionnez un **paramètre RAG** dans le menu déroulant (chaque paramètre possède son propre index, modèle d'embedding et paramètres)
2. Saisissez une requête et appuyez sur Entrée ou cliquez sur le bouton de recherche
3. Ajustez le **Top K** (nombre maximal de résultats) et le **Score Threshold** (similarité minimale) selon vos besoins

Les résultats sont classés par similarité cosinus entre l'embedding de la requête et chaque chunk indexé.

## Filtre par mot-clé

Après une recherche sémantique, utilisez le filtre par mot-clé en haut de la liste des résultats pour affiner les résultats. Plusieurs champs de filtre peuvent être combinés pour un filtrage précis.

![Filtre par mot-clé](images/rag-search-keyword.png)

- **Dans un champ** — Les termes séparés par des espaces utilisent la logique **OU** (tout terme correspond)
- **Entre les champs** — Plusieurs champs utilisent la logique **ET** (tous les champs doivent correspondre)
- Cliquez sur le bouton **+ ET** pour ajouter un champ de filtre
- Cliquez sur **✕** pour supprimer un champ de filtre
- Recherche dans le texte du fragment et le chemin du fichier
- Les espaces dans le texte sont normalisés (sauts de ligne, espaces pleine largeur regroupés) afin que les artefacts d'extraction PDF n'empêchent pas la correspondance
- La correspondance est également effectuée sur une version du texte sans espaces, de sorte que les mots CJK séparés par des espaces d'extraction PDF correspondent toujours (par ex., la recherche de "3つのコア機能" correspond à "3 つのコア機能")
- La case "Tout sélectionner" et le compteur reflètent la vue filtrée
- Effacez tous les filtres pour revoir tous les résultats

### Suggestion de mots-clés par IA

Chaque champ de filtre dispose d'un bouton **✦** qui utilise l'IA pour enrichir vos mots-clés avec des synonymes et termes associés.

- Saisissez des mots-clés puis cliquez sur ✦
- Le **Modèle d'affinage IA** configuré génère des termes associés et remplace le contenu du champ
- Si la saisie n'est pas en anglais, des traductions anglaises et des termes anglais associés sont également inclus
- Les termes redondants contenant un mot-clé original comme sous-chaîne sont automatiquement supprimés (ils n'amélioreraient pas le filtrage OU)
- Cliquez sur le bouton **↩** (annuler) pour restaurer les mots-clés originaux
- Nécessite la sélection d'un modèle dans **Modèle d'affinage IA** (icône engrenage des paramètres de recherche)

Utile pour capturer les variations terminologiques que la similarité d'embedding aurait pu manquer, tout en filtrant les résultats déjà récupérés.

## Sélection des résultats

- Cliquez sur une ligne de résultat pour basculer sa sélection
- Utilisez la case **Tout sélectionner** pour sélectionner/désélectionner tous les résultats visibles (filtrés)
- Le compteur **Sélectionnés** indique le nombre de résultats sélectionnés parmi l'ensemble des résultats (pas uniquement la vue filtrée)

## Envoi des résultats vers Chat ou Discussion

Sélectionnez des résultats à l'aide des cases à cocher, puis cliquez sur l'un des boutons :

- **Chat** — Les résultats sont ajoutés comme pièces jointes dans la zone de saisie du Chat. Le menu déroulant RAG du Chat est automatiquement réglé sur « none » pour éviter l'injection de contexte en double.
- **Discussion** — Les résultats sont ajoutés comme pièces jointes dans le panneau Discussion et l'onglet bascule vers Discussion.

![Envoi des résultats vers Discussion](images/rag-search-discussion.png)

Les résultats textuels deviennent des pièces jointes textuelles modifiables. Les résultats multimédias (images, PDF, audio, vidéo) sont joints en tant que fichiers binaires.

**Édition dans Chat :** Après avoir envoyé les résultats vers Chat, les pièces jointes texte avec un chemin source sont cliquables dans la zone de saisie. Cliquez pour ouvrir le contenu dans une fenêtre modale où vous pouvez le consulter et le modifier avant l'envoi.

![Édition des résultats RAG dans Chat](images/rag-search-chat.png)

## Édition des chunks

Cliquez sur l'icône crayon (visible lorsqu'un résultat textuel est déplié) pour ouvrir la fenêtre modale d'édition de chunk.

![Fenêtre modale d'édition de chunk](images/rag-search-edit.png)

Dans l'éditeur, vous pouvez :

- **Modifier le texte** — Modifiez librement le contenu du chunk. Les modifications sont sauvegardées dans la liste des résultats de recherche.
- **Charger le chunk précédent** — Cliquez sur `▲ Load previous chunk` pour ajouter au début le chunk précédent du même fichier. Le chevauchement entre les chunks est automatiquement supprimé.
- **Charger le chunk suivant** — Cliquez sur `▼ Load next chunk` pour ajouter à la suite le chunk suivant du même fichier. Le chevauchement est automatiquement supprimé.
- **Combiner et modifier** — Après avoir chargé des chunks adjacents, l'ensemble du texte est modifiable en un seul bloc. Enregistrez pour mettre à jour le résultat.

Cette fonctionnalité est utile lorsqu'une recherche sémantique renvoie un chunk auquel manque un contexte important provenant du texte environnant.

## Affiner avec l'IA

Cliquez sur **✨ Refine with AI** dans l'éditeur de chunk pour étendre et nettoyer automatiquement le texte à l'aide d'un LLM.

**Fonctionnement :**

1. **Extension initiale** — Charge jusqu'à 3 chunks précédents et 3 chunks suivants en parallèle
2. **Évaluation par l'IA** — Le LLM évalue si le texte dispose d'un contexte suffisant pour la requête de recherche. Si davantage de contexte est nécessaire, il charge 3 chunks supplémentaires dans la direction indiquée (jusqu'à 5 itérations)
3. **Affinement** — Le LLM nettoie le texte combiné : supprime les artefacts de découpage, les phrases coupées et le bruit tout en préservant toutes les informations pertinentes. Le résultat est diffusé en streaming dans l'éditeur.

**Configuration :** Sélectionnez un modèle dans le menu déroulant **AI Refine Model** dans les paramètres de recherche (icône engrenage). Le bouton est désactivé lorsqu'aucun modèle n'est sélectionné.

**Remarques :**
- Le bouton est masqué après utilisation (opération unique par session d'édition)
- Les liens vers les chunks précédent/suivant sont masqués pendant et après l'affinement
- La zone de texte est désactivée pendant le traitement pour indiquer l'activité en cours
- La langue d'origine du contenu est préservée

## Traitement des résultats PDF

Les résultats de recherche PDF disposent d'un menu déroulant par résultat pour choisir le mode de pièce jointe :

- **As text** — Le texte est extrait du PDF à l'aide de PDF.js. Le texte extrait est affiché dans l'aperçu du résultat, prend en charge le filtrage par mots-clés et peut être modifié dans l'éditeur de chunk. Fonctionne aussi bien pour les fichiers du vault que pour les PDF externes (chemin absolu).
- **As PDF chunk** — Pages PDF originales avec aperçu en ligne, jointes en tant que fichier binaire

Lors du chargement des résultats de recherche, l'extraction de texte s'exécute automatiquement en arrière-plan pour tous les résultats PDF, remplaçant l'étiquette de métadonnées par le contenu réel. Cela permet le filtrage par mots-clés et l'édition sur le texte PDF réel.

## Paramètres d'index

Cliquez sur l'icône engrenage dans la barre de recherche pour ouvrir la configuration d'index en ligne :

- **Chunk Size** — Nombre de caractères par chunk
- **Chunk Overlap** — Chevauchement en caractères entre chunks adjacents
- **PDF Chunk Pages** — Nombre de pages PDF par chunk d'embedding (1–6)
- **Target Folders** — Limiter l'indexation à des dossiers spécifiques (séparés par des virgules)
- **Exclude Patterns** — Expressions régulières pour exclure des fichiers (un motif par ligne)
- **Search File Extensions** — Limiter la recherche à des types de fichiers spécifiques (séparés par des virgules)
- **AI Refine Model** — Sélectionner le modèle LLM utilisé pour « Refine with AI » dans l'éditeur de chunk (aucun = désactivé)
- Bouton **Sync** avec barre de progression et horodatage de la dernière synchronisation
- Liste des **fichiers indexés** avec le nombre de chunks par fichier

## Fonctionnement du RAG : Chat vs Recherche

| | Chat + menu déroulant RAG | Recherche → Sélection → Chat/Discussion |
|---|---|---|
| **Injection de contexte** | Prompt système (automatique) | Pièces jointes du message utilisateur |
| **Édition** | Non modifiable avant l'envoi | Cliquez sur les pièces jointes pour modifier dans la modale |
| **Paramètres** | Utilise les valeurs par défaut du paramètre RAG | Ajustable à chaque recherche (Top K, seuil) |
| **Sélection des résultats** | Tous les résultats inclus automatiquement | L'utilisateur choisit les résultats à inclure |
| **Chunks adjacents** | Non disponible | Charger les chunks précédent/suivant dans l'éditeur |
| **Filtre par mot-clé** | Non disponible | Filtrer les résultats avant la sélection |
| **Affinement IA** | Non disponible | Extension automatique des chunks et affinement avec LLM |

Le flux de recherche offre un contrôle plus fin sur le contexte envoyé au LLM. Le menu déroulant RAG du Chat est un raccourci pratique pour l'injection de contexte entièrement automatique.

## RAG dans Discussion

Le panneau Discussion prend en charge le RAG de deux manières :

1. **Recherche → Discussion** — Sélectionnez des résultats dans l'onglet Recherche et cliquez sur le bouton Discussion. Les résultats sont ajoutés comme pièces jointes et peuvent être modifiés avant de commencer.
2. **Menu déroulant RAG** — Sélectionnez un paramètre RAG directement dans le panneau Discussion. Le texte du thème est utilisé comme requête de recherche. Cette option est désactivée lorsque des pièces jointes sont déjà présentes (provenant de la recherche ou d'un téléchargement de fichier).

Le contexte RAG et les pièces jointes ne sont envoyés qu'au **premier tour** de la discussion afin d'éviter des appels API redondants. Les tours suivants s'appuient sur l'historique de la discussion qui reflète déjà le contexte RAG.
