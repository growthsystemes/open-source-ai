#  Benchmark TensorRT-LLM sur TinyLlama avec Docker

Mesure le gain de performances qu'apporte [NVIDIA TensorRT‑LLM](https://github.com/NVIDIA/TensorRT-LLM) avec un petit modèle open‑source Hugging Face (TinyLlama 1.1B Chat) par rapport à l'inférence PyTorch "pure". Tout le projet tourne dans un conteneur Docker prêt à l'emploi : aucune compilation locale n'est nécessaire.

## Objectifs

- Reproduire facilement un flux complet : télécharger le modèle → convertir/optimiser → générer un moteur TensorRT → benchmarker
- Obtenir des métriques latency & throughput « out‑of‑the‑box »
- Servir de point de départ pour tester d'autres LLM, quantisations ou GPUs

## 📁 Arborescence

```
.
├── docker/
│   └── Dockerfile              # Image basée sur nvcr.io/nvidia/tensorrt‑llm
├── scripts/
│   ├── build_engine.sh         # Construction du moteur TensorRT
│   ├── bench_pytorch.sh        # Benchmark référence (PyTorch)
│   ├── bench_trt.sh           # Benchmark optimisé (TensorRT-LLM)
│   └── compare.py             # Analyse et comparaison des résultats
├── docker-compose.yml         # Services Docker pour faciliter l'utilisation
├── data/                      # Données persistantes (créé automatiquement)
│   ├── models/               # Modèles téléchargés
│   ├── engines/              # Moteurs TensorRT compilés
│   ├── checkpoints/          # Checkpoints intermédiaires
│   └── results/              # Résultats de benchmark
└── README.md
```

## 🛠Prérequis

- **Docker** avec support GPU (`nvidia-docker` ou Docker Desktop avec GPU)
- **GPU NVIDIA** compatible CUDA (RTX 20xx/30xx/40xx recommandé)
- **8+ GB de VRAM** (minimum pour TinyLlama 1.1B)
- **Drivers NVIDIA** récents (525+)
- **Compte NVIDIA NGC** (gratuit) pour accéder aux images TensorRT-LLM

### ÉTAPE OBLIGATOIRE : Authentification NVIDIA

**Avant de commencer**, vous devez vous authentifier sur le registry NVIDIA :

#### Option 1 : Script Automatique (Recommandé)

**Windows :**
```powershell
.\setup_nvidia_auth.ps1
```

**Linux/macOS :**
```bash
chmod +x setup_nvidia_auth.sh
./setup_nvidia_auth.sh
```

#### Option 2 : Manuel

1. **Créer un compte NGC** sur [ngc.nvidia.com](https://ngc.nvidia.com) (gratuit)
2. **Générer une clé API** : Profile → Setup → Generate API Key
3. **Se connecter** :
   ```bash
   docker login nvcr.io
   # Username: $oauthtoken
   # Password: [votre_clé_API_qui_commence_par_nvapi-]
   ```

**Guide détaillé** : Voir [NVIDIA_SETUP.md](NVIDIA_SETUP.md)

### Vérification GPU

```bash
# Vérifier que Docker peut accéder au GPU
docker run --rm --gpus all nvidia/cuda:12.0-base-ubuntu20.04 nvidia-smi
```

## Utilisation Rapide

### Commande Recommandée (Une Ligne)

Après avoir configuré l'authentification NVIDIA, lancez le benchmark complet :

```bash
docker-compose --profile auto up benchmark-full
```

**⏱Durée estimée** : 15-25 minutes selon votre GPU  
**Résultats** : Générés automatiquement dans `./data/results/`

### Pipeline Complet Exécuté

Cette commande exécute automatiquement :
1. **Construction du moteur TensorRT** (`build_engine.sh`)
2. **Benchmark PyTorch** (référence baseline)
3. **Benchmark TensorRT-LLM** (version optimisée)
4. **Analyse comparative** (graphiques + rapport JSON)

### Étapes Manuelles (Contrôle Avancé)

Pour plus de contrôle sur chaque étape :

```bash
# 1. Construction du moteur TensorRT-LLM
docker-compose --profile build-only up build-engine

# 2. Benchmark PyTorch (référence baseline)  
docker-compose --profile pytorch-only up benchmark-pytorch

# 3. Benchmark TensorRT-LLM (version optimisée)
docker-compose --profile tensorrt-only up benchmark-tensorrt

# 4. Comparaison et analyse des résultats
docker-compose --profile compare-only up compare-results
```

### Mode Interactif (Debug/Exploration)

Pour explorer le système ou déboguer :

```bash
# Démarrage du container en mode interactif
docker-compose --profile manual run --rm tensorrt-llm-benchmark bash

# Dans le container, vous pouvez exécuter :
bash scripts/build_engine.sh
bash scripts/bench_pytorch.sh  
bash scripts/bench_trt.sh
python3 scripts/compare.py

# Ou explorer les modèles/engines :
ls -la data/models/
ls -la data/engines/
cat data/results/pytorch_benchmark.json
```

## Résultats

Après exécution, vous trouverez dans `./data/results/` :

### Fichiers Générés

- `pytorch_benchmark.json` - Métriques détaillées PyTorch
- `tensorrt_benchmark.json` - Métriques détaillées TensorRT-LLM  
- `benchmark_comparison_report.json` - Rapport de comparaison complet
- `benchmark_comparison.png` - Graphiques de comparaison

### Métriques Analysées

- **⏱Latence** : Temps de génération par séquence (ms)
- **Débit** : Tokens générés par seconde
- **Mémoire GPU** : Utilisation VRAM (GB)
- **Speedup** : Facteur d'amélioration TensorRT vs PyTorch

### Exemple de Sortie Réelle (RTX 4070)

```
RAPPORT DE PERFORMANCE - TensorRT-LLM vs PyTorch
============================================================

LATENCE:
   PyTorch:     627.9 ms
   TensorRT:    260.3 ms
   📊 Speedup:   2.41x
   📉 Réduction: 58.5%

DÉBIT:
   PyTorch:     864.4 tokens/s
   TensorRT:    2723.2 tokens/s
   📊 Speedup:   3.15x
   📈 Gain:      215.0%

MÉMOIRE GPU:
   PyTorch:     2.60 GB
   TensorRT:    2.61 GB
   📊 Ratio:     1.00x
   📉 Variation: +0.1%
```

## ⚙Configuration Avancée

### Personnaliser les Paramètres de Benchmark

Modifiez les scripts dans `./scripts/` pour ajuster :

- **Nombre d'itérations** : `num_iterations=10` dans les scripts
- **Longueur de génération** : `max_new_tokens=200` (optimisé pour TensorRT)
- **Paramètres de sampling** : `temperature=0.7`, `top_p=0.9`
- **Taille de batch** : `max_batch_size=1` dans `build_engine.sh`
- **Prompts** : Utilisez des séquences longues pour maximiser les gains TensorRT

### Tester d'Autres Modèles

Dans `scripts/build_engine.sh`, changez :

```bash
MODEL_NAME="microsoft/DialoGPT-medium"  # Exemple
# ou
MODEL_NAME="facebook/opt-1.3b"
```

### Optimisations TensorRT-LLM Appliquées

Ce projet utilise les optimisations suivantes pour maximiser les performances :

#### Optimisations Automatiques
- **torch.compile** : Compilation des graphes PyTorch pour de meilleures performances
- **FP16 precision** : Calculs en demi-précision pour réduire la latence  
- **KV-cache optimization** : Gestion optimisée du cache des clés/valeurs
- **Kernel fusion** : Fusion des opérations GPU pour réduire les appels
- **Memory pooling** : Gestion optimisée de la mémoire GPU

#### Configuration Optimisée
```python
# Dans les scripts de benchmark
model.eval()                    # Mode évaluation
model.half()                   # Précision FP16  
torch.compile(model, mode='max-autotune')  # Compilation optimisée
use_cache=True                 # Cache KV activé
num_beams=1                    # Single beam pour latence
```

#### Pour des Gains Maximaux
- Utilisez des **prompts longs** (100+ tokens)
- Générez des **séquences longues** (200+ tokens)
- Activez **torch.compile** (automatique dans ce projet)
- Testez avec des **modèles plus grands** (7B, 13B)

## Dépannage

### Erreurs Courantes

**"CUDA out of memory"**
```bash
# Réduire la taille du modèle ou les paramètres
# Dans build_engine.sh :
--max_batch_size 1
--max_input_len 256
--max_output_len 256
```

**"TensorRT engine not found"**
```bash
# Reconstruire le moteur
docker-compose --profile build-only up build-engine
```

**"Docker can't access GPU"**
```bash
# Vérifier l'installation nvidia-docker
sudo apt-get update
sudo apt-get install -y nvidia-docker2
sudo systemctl restart docker
```

### Logs et Debug

```bash
# Voir les logs détaillés
docker-compose --profile auto up benchmark-full --verbose

# Mode debug interactif
docker-compose --profile manual run --rm tensorrt-llm-benchmark bash
```

## Résultats de Benchmark Validés

### RTX 4070 - TinyLlama 1.1B (Séquences Longues)

| Métrique | PyTorch | TensorRT-LLM | **Gain TensorRT** |
|----------|---------|--------------|-------------------|
| **Latence moyenne** | 627.9 ms | 260.3 ms | **🚀 2.41x plus rapide** |
| **Débit moyen** | 864.4 tok/s | 2723.2 tok/s | **🚀 3.15x plus rapide** |
| **Mémoire GPU** | 2.60 GB | 2.61 GB | ≈ Identique |

### Conditions de Test
- **GPU** : NVIDIA RTX 4070 (12GB VRAM)
- **Modèle** : TinyLlama-1.1B-Chat-v1.0
- **Séquences** : Prompts longs (~100 tokens) + génération 200 tokens
- **Précision** : FP16
- **Configuration** : 10 itérations par benchmark

### Pourquoi Ces Gains ?

Les **séquences longues maximisent l'impact TensorRT-LLM** grâce à :
- **Optimisations KV-cache** : Plus efficaces sur longues séquences
- **Fusion des kernels GPU** : Réduction des appels GPU
- **Gestion mémoire optimisée** : Moins de transferts CPU-GPU
- **torch.compile** : Compilation optimisée des graphes

*Les gains augmentent avec la longueur des séquences et la taille du modèle.*

## Personnalisation

### Ajouter d'Autres Modèles

1. Créer un nouveau script `scripts/build_engine_<model>.sh`
2. Adapter les chemins et paramètres du modèle
3. Ajouter un service dans `docker-compose.yml`

### Métriques Supplémentaires

Modifiez `scripts/compare.py` pour ajouter :
- Analyse de la qualité de génération (BLEU, perplexité)
- Profiling détaillé du GPU
- Comparaison avec d'autres backends (ONNX, OpenVINO)

## Ressources

- [Documentation TensorRT-LLM](https://nvidia.github.io/TensorRT-LLM/)
- [Guide d'optimisation NVIDIA](https://docs.nvidia.com/deeplearning/tensorrt/developer-guide/)
- [Modèles supportés](https://github.com/NVIDIA/TensorRT-LLM/tree/main/examples)

## Contribution

Les contributions sont bienvenues ! Ouvrez une issue ou proposez une pull request pour :
- Support de nouveaux modèles
- Optimisations supplémentaires  
- Amélioration des métriques
- Documentation

## Licence

MIT License - Voir [LICENSE](LICENSE) pour plus de détails.

---

## Démarrage Rapide

1. **Authentification NVIDIA** (obligatoire) :
   ```powershell
   .\setup_nvidia_auth.ps1
   ```

2. **Benchmark complet automatique** :
   ```bash
   docker-compose --profile auto up benchmark-full
   ```

3. **Consulter les résultats** :
   ```bash
   # Voir le rapport
   cat data/results/benchmark_comparison_report.json
   
   # Ouvrir le graphique  
   start data/results/benchmark_comparison.png  # Windows
   open data/results/benchmark_comparison.png   # macOS
   ```

**Résultats attendus sur RTX 4070** : **2.4x latence** et **3.2x débit** ! 🚀
