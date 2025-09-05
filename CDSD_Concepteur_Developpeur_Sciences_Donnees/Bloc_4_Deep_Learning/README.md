# 🧠 Bloc 4 – Deep Learning sur Données Non-Structurées

Ce dossier contient un projet réalisé dans le cadre du **Bloc 4 – Deep Learning sur Données Non-Structurées** de la certification **CDSD – Concepteur Développeur en Sciences des Données** (Jedha / RNCP 35288).  
Ce bloc vise à développer des compétences avancées en **traitement de texte, vision par ordinateur, réseaux de neurones**, et à manipuler des modèles pré-entraînés.

---

## 🧪 Projet inclus

### 🔹 AT&T – Détection automatique de spams par Deep Learning
Projet NLP réalisé pour l’entreprise de télécommunications **AT&T**, visant à automatiser la détection des messages SPAM à partir de leur contenu textuel. Trois approches ont été comparées :

#### 1️⃣ TF-IDF + Réseau de Neurones dense
- Nettoyage et lemmatisation des messages avec **spaCy**
- Tokenisation et encodage TF-IDF (8 000 mots)
- Sur-échantillonnage des spams pour équilibrer les classes
- Entraînement d’un **réseau de neurones dense** avec `Keras`
- Suivi de la performance : Accuracy, Precision, Recall, matrice de confusion

#### 2️⃣ Embedding + Réseau de Neurones
- Encodage par **tokenisation + padding**
- Construction d’un modèle avec **layer Embedding + GlobalAveragePooling**
- Comparaison des performances avec la méthode TF-IDF

#### 3️⃣ Fine-tuning de BERT (DistilBERT)
- Utilisation de `transformers` pour encoder les messages avec **DistilBERT**
- Split du jeu de données avec `train/val/test` (60/20/20)
- Fine-tuning du modèle avec `torch` et `AdamW`
- Suivi de la perte et de l’accuracy par époque
- Évaluation finale via matrice de confusion et métriques


#### Comparaison des modèles
- Regroupement des performances (F1-score, confusion matrix)
- Discussion sur l’importance de la **précision** dans le contexte métier
- Choix du modèle à déployer en fonction de la sensibilité au faux positifs

---

## 🧰 Technologies & outils

- Python (Pandas, Scikit-learn, TensorFlow, PyTorch)
- spaCy pour le prétraitement linguistique
- Keras pour les modèles DNN
- Hugging Face Transformers pour BERT
- Matplotlib / Seaborn pour la visualisation
- Git / GitHub pour le suivi de version

---

## 📚 Compétences mobilisées

- Traitement de texte : nettoyage, lemmatisation, tokenisation
- Embedding : TF-IDF, Tokenizer, Transformer
- Construction & entraînement de modèles de deep learning
- Évaluation via matrices de confusion et métriques de classification
- Fine-tuning de modèles pré-entraînés
- Comparaison et choix d’architecture en fonction du cas d’usage

---

👨‍🎓 Réalisé par **Loic Valentini**  
🔗 [LinkedIn](https://www.linkedin.com/in/loic-valentini-0a6238107/)  
🏫 Certification CDSD – Jedha Bootcamp  
📅 Année : 2025
