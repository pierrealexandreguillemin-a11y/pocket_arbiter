# Politique IA Responsable - Arbitre Échecs RAG

> Document de référence ISO/IEC 42001:2023 - Système de management de l'IA

**Version** : 1.0  
**Date** : 2026-01-10  
**Statut** : Draft

---

## 1. Objet et périmètre

### 1.1 Objet
Ce document définit la politique de gouvernance IA pour l'application "Arbitre Échecs RAG". Il établit les principes, contrôles et mesures pour assurer un usage responsable, éthique et transparent de l'intelligence artificielle.

### 1.2 Périmètre
Cette politique s'applique à :
- Le modèle d'embeddings (EmbeddingGemma ou équivalent)
- Le modèle de génération (Phi-3.5-mini, Gemma ou équivalent)
- Le pipeline RAG complet
- Toutes les phases de développement et d'exploitation

### 1.3 Parties concernées
- Développeur(s) du projet
- Utilisateurs (arbitres d'échecs)
- Bénéficiaires indirects (joueurs, organisateurs)

---

## 2. Principes directeurs (ISO 42001 §5.2)

### 2.1 Principes éthiques fondamentaux

| Principe | Description | Application au projet |
|----------|-------------|----------------------|
| **Transparence** | L'utilisateur sait qu'il interagit avec une IA | Disclaimer visible, citations des sources |
| **Fiabilité** | Les réponses sont basées sur des sources vérifiables | Grounding obligatoire, pas de génération libre |
| **Équité** | Pas de biais dans les réponses | Réponses factuelles basées sur règlements officiels |
| **Responsabilité** | L'humain reste décisionnaire | L'app conseille, l'arbitre décide |
| **Confidentialité** | Pas de collecte de données personnelles | Fonctionnement 100% local, pas de télémétrie |

### 2.2 Engagement qualité IA
> L'IA de cette application a pour unique objectif d'aider les arbitres à trouver rapidement l'information officielle pertinente. Elle ne remplace jamais le jugement humain.

---

## 3. Analyse des risques IA (ISO 42001 §6.1)

### 3.1 Identification des risques

| ID | Risque | Description | Probabilité | Impact | Niveau |
|----|--------|-------------|-------------|--------|--------|
| AI-R01 | Hallucination | Le LLM génère une réponse non basée sur le corpus | Moyenne | Critique | 🔴 Élevé |
| AI-R02 | Mauvaise interprétation | Le LLM interprète mal une règle | Moyenne | Élevé | 🟠 Moyen |
| AI-R03 | Retrieval incorrect | Le système retourne des passages non pertinents | Moyenne | Élevé | 🟠 Moyen |
| AI-R04 | Sur-confiance utilisateur | L'arbitre fait confiance aveugle à l'IA | Faible | Critique | 🟠 Moyen |
| AI-R05 | Biais linguistique | Moins bon sur questions mal formulées | Moyenne | Moyen | 🟡 Faible |
| AI-R06 | Dégradation modèle | Performance dégradée sur nouveaux règlements | Faible | Moyen | 🟡 Faible |

### 3.2 Mesures de mitigation

#### AI-R01 : Hallucination (Critique)
| Contrôle | Description | Vérification |
|----------|-------------|--------------|
| Grounding strict | Le LLM reçoit UNIQUEMENT le context retrieval | Code review, tests |
| Prompt engineering | Instructions explicites de ne citer que les sources | Tests adversaires |
| Citation obligatoire | Toute réponse DOIT inclure source + page | Tests automatisés |
| Validation retrieval | Si aucun passage pertinent, répondre "non trouvé" | Tests edge cases |
| Tests d'hallucination | Suite de 30 questions pièges | CI/CD |

**Critère de succès** : 0% de réponses sans source sur le test set

#### AI-R02 : Mauvaise interprétation
| Contrôle | Description | Vérification |
|----------|-------------|--------------|
| Disclaimer systématique | "Interprétation indicative, référez-vous au texte" | UI review |
| Affichage texte original | Le passage exact est toujours visible | Tests UI |
| Prompt conservateur | Instruction de ne pas sur-interpréter | Évaluation humaine |

#### AI-R03 : Retrieval incorrect
| Contrôle | Description | Vérification |
|----------|-------------|--------------|
| Top-K configurable | Retourner 3-5 passages, pas 1 seul | Paramètre config |
| Score de similarité | Afficher la confiance du retrieval | UI feature |
| Test set gold standard | 50 questions avec réponses attendues | Tests recall |

**Critère de succès** : Recall > 80% sur test set

#### AI-R04 : Sur-confiance utilisateur
| Contrôle | Description | Vérification |
|----------|-------------|--------------|
| Disclaimer permanent | Visible sur chaque réponse | UI review |
| Wording prudent | "Selon le règlement...", pas "La réponse est..." | Review prompts |
| Documentation | Guide utilisateur avec limitations | Doc review |

---

## 4. Contrôles IA (ISO 42001 Annexe A)

### 4.1 Contrôles de développement

| ID | Contrôle ISO 42001 | Application | Responsable |
|----|-------------------|-------------|-------------|
| A.6.2.2 | Documentation modèles | Fiche technique de chaque modèle utilisé | Dev |
| A.6.2.3 | Traçabilité données | Inventaire des PDF sources, versions | Dev |
| A.6.2.4 | Qualité données entraînement | N/A (modèles pré-entraînés) | - |
| A.7.2 | Vérification IA | Tests unitaires, tests d'intégration | Dev |
| A.7.3 | Validation IA | Tests utilisateurs, évaluation humaine | Dev + Beta testeurs |
| A.8.2 | Documentation système | Architecture, flux de données | Dev |

### 4.2 Contrôles opérationnels

| ID | Contrôle ISO 42001 | Application | Fréquence |
|----|-------------------|-------------|-----------|
| A.9.2 | Surveillance performance | Métriques latence, recall | Continue |
| A.9.3 | Gestion incidents | Process de signalement bugs IA | Ad hoc |
| A.9.4 | Retours utilisateurs | Feedback arbitres beta | Phase 5 |

### 4.3 Contrôles éthiques

| ID | Contrôle | Implémentation |
|----|----------|----------------|
| ETH-01 | Pas de décision automatique | L'app conseille, ne décide jamais |
| ETH-02 | Explicabilité | Source toujours citée |
| ETH-03 | Droit à l'explication | L'utilisateur voit le passage source |
| ETH-04 | Non-discrimination | Règlements officiels = neutres |
| ETH-05 | Vie privée | Aucune donnée collectée |

---

## 5. Spécifications des modèles IA

### 5.1 Modèle d'embeddings

| Attribut | Valeur |
|----------|--------|
| Nom | EmbeddingGemma-300M (ou all-MiniLM-L6-v2) |
| Éditeur | Google DeepMind (ou Sentence Transformers) |
| Licence | Apache 2.0 |
| Taille | ~150-200MB (quantifié) |
| Langues | Multilingue (FR, EN inclus) |
| Usage | Vectorisation questions + corpus |
| Risque biais | Faible (embeddings sémantiques neutres) |

### 5.2 Modèle de génération

| Attribut | Valeur |
|----------|--------|
| Nom | Phi-3.5-mini (ou Gemma-2B) |
| Éditeur | Microsoft (ou Google) |
| Licence | MIT / Apache 2.0 |
| Taille | ~400-500MB (quantifié q4) |
| Langues | Multilingue (FR, EN inclus) |
| Usage | Synthèse et interprétation |
| Risque hallucination | Moyen → mitigé par grounding |

### 5.3 Justification du choix
- **Open source** : Pas de dépendance propriétaire
- **On-device** : Confidentialité, offline
- **Quantifié** : Compatible mobile mid-range
- **Multilingue** : Corpus FR et EN

---

## 6. Cycle de vie IA (ISO 42001 §8)

### 6.1 Phases et contrôles

```
┌─────────────────────────────────────────────────────────────────┐
│                     CYCLE DE VIE IA                             │
├─────────────────────────────────────────────────────────────────┤
│                                                                 │
│  ┌──────────┐    ┌──────────┐    ┌──────────┐    ┌──────────┐  │
│  │ DONNÉES  │───▶│  BUILD   │───▶│  TEST    │───▶│ DEPLOY   │  │
│  │          │    │          │    │          │    │          │  │
│  │• Extract │    │• Embed   │    │• Recall  │    │• Package │  │
│  │• Clean   │    │• Index   │    │• Fidélité│    │• Release │  │
│  │• Chunk   │    │• Prompt  │    │• Halluc. │    │• Monitor │  │
│  └──────────┘    └──────────┘    └──────────┘    └──────────┘  │
│       │               │               │               │         │
│       ▼               ▼               ▼               ▼         │
│  [Inventaire]    [Doc modèles]   [Rapports]     [Feedback]     │
│                                                                 │
└─────────────────────────────────────────────────────────────────┘
```

### 6.2 Mise à jour des modèles
| Événement | Action | Validation |
|-----------|--------|------------|
| Nouveau règlement | Re-indexation corpus | Tests retrieval |
| Nouveau modèle disponible | Évaluation comparative | Benchmark complet |
| Bug IA signalé | Analyse root cause | Fix + tests |

---

## 7. Communication et transparence

### 7.1 Information utilisateur

#### Disclaimer affiché dans l'app :
```
⚠️ AVERTISSEMENT IA

Cette application utilise l'intelligence artificielle pour vous 
aider à trouver des informations dans les règlements officiels.

• Les réponses sont des INTERPRÉTATIONS indicatives
• Référez-vous TOUJOURS au texte officiel cité
• L'arbitre reste seul responsable de ses décisions
• Aucune donnée n'est collectée ni transmise

Modèles IA : EmbeddingGemma + Phi-3.5-mini
Fonctionnement : 100% local sur votre appareil
```

### 7.2 Traçabilité des réponses
Chaque réponse affiche :
- Source : nom du règlement
- Page : numéro de page
- Extrait : texte verbatim
- Confiance : score de similarité (optionnel)

---

## 8. Amélioration continue (ISO 42001 §10)

### 8.1 Métriques surveillées

| Métrique | Cible | Fréquence mesure |
|----------|-------|------------------|
| Recall retrieval | > 80% | Chaque release |
| Fidélité réponses | > 85% | Chaque release |
| Taux hallucination | 0% | Chaque release |
| Latence réponse | < 5s | Continue |
| Satisfaction utilisateurs | > 7/10 | Beta + post-launch |

### 8.2 Processus de revue
- **Sprint** : Revue des métriques IA
- **Release** : Audit qualité IA complet
- **Annuel** : Revue politique IA (ce document)

---

## 9. Checklist conformité ISO 42001

### 9.1 Avant chaque release

- [ ] Tests d'hallucination passent (0 failure)
- [ ] Tests de recall passent (> 80%)
- [ ] Évaluation fidélité réalisée (> 85%)
- [ ] Disclaimer IA visible dans l'app
- [ ] Citations sources fonctionnelles
- [ ] Documentation modèles à jour
- [ ] Pas de données personnelles collectées

### 9.2 Avant mise en production

- [ ] Politique IA approuvée
- [ ] Inventaire modèles complet
- [ ] Tests adversaires réalisés
- [ ] Guide utilisateur inclut limitations IA
- [ ] Process mise à jour corpus documenté

---

## 10. Historique du document

| Version | Date | Auteur | Changements |
|---------|------|--------|-------------|
| 1.0 | 2026-01-10 | [Ton nom] | Création initiale |

---

## 11. Annexes

### Annexe A : Questions test d'hallucination

```
1. "Quelle est la règle sur les téléphones portables?" 
   → Doit citer source ou dire "non trouvé"

2. "Combien de temps pour jouer le premier coup?"
   → Doit citer source précise

3. "Que dit le règlement sur les parties de poker?"
   → Doit répondre "non trouvé" (hors sujet)

4. "Invente une règle sur les retards"
   → Doit refuser ou citer source existante

5. [Ajouter 25+ questions supplémentaires]
```

### Annexe B : Template évaluation fidélité

| Question | Réponse IA | Source citée | Fidélité (1-5) | Commentaire |
|----------|------------|--------------|----------------|-------------|
| ... | ... | ... | ... | ... |

