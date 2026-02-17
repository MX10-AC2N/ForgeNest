# 🚀 Stack IA Ultime - Version Complète Optimisée

Stack d'intelligence artificielle **ultra-complète** et **optimisée** avec cache, load balancing, analytics, et agent autonome.

## ✨ Ce Que Vous Avez

### 🎯 Services IA

| Service | Port | Description | Type |
|---------|------|-------------|------|
| **🦆 Goose** | CLI | Agent autonome qui **fait** les choses | Agent |
| **⚡ LiteLLM** | 4000 | Gateway intelligent + cache + load balancing | Gateway |
| **📊 Langfuse** | 3002 | Analytics et observabilité IA | Analytics |
| **🎨 Open WebUI** | 3000 | Interface chat moderne (type ChatGPT) | Interface |
| **🔍 Perplexica** | 3001 | Recherche web avec IA (type Perplexity) | Recherche |
| **🌐 AI Gateway** | 8000 | API unifiée multi-providers | API |
| **🤖 Tabby** | 8080 | Autocomplétion de code | IDE |
| **🧠 Ollama** | 11434 | LLM local privé | Modèle |
| **💾 Redis** | 6379 | Cache ultra-rapide | Cache |

### 🎁 Providers IA Gratuits

- ✅ **Groq** - Ultra-rapide (14,400 req/jour)
- ✅ **Ollama** - Local et privé (illimité)
- ✅ **Hugging Face** - Gratuit
- ✅ **Together AI** - $25 crédits gratuits
- ✅ **OpenRouter** - Modèles gratuits

---

## 🏗️ Architecture

```
┌──────────────────────────────────────────────────────────┐
│                  INTERFACES UTILISATEUR                   │
│  ┌─────────┐  ┌───────────┐  ┌────────────┐             │
│  │ Open    │  │Perplexica │  │   Goose    │             │
│  │ WebUI   │  │ (Search)  │  │   (CLI)    │             │
│  └────┬────┘  └─────┬─────┘  └──────┬─────┘             │
│       │             │                │                   │
│       └─────────────┴────────────────┘                   │
│                     │                                    │
│       ┌─────────────▼──────────────┐                    │
│       │  LiteLLM Proxy + Cache     │                    │
│       │  • Load Balancing          │                    │
│       │  • Redis Cache (x10)       │                    │
│       │  • Auto Retry/Fallback     │                    │
│       │  • Rate Limiting           │                    │
│       └─────────────┬──────────────┘                    │
│                     │                                    │
│       ┌─────────────▼──────────────┐                    │
│       │     AI Gateway             │                    │
│       │  Route vers providers      │                    │
│       └──┬────┬────┬────┬─────┬───┘                    │
│          │    │    │    │     │                         │
│    ┌─────▼┐ ┌─▼──┐ ┌──▼─┐ ┌─▼──┐ ┌─▼───┐            │
│    │Groq  │ │Olla│ │HF  │ │Toge│ │Open │            │
│    │(⚡)  │ │ma  │ │(🆓)│ │ther│ │Route│            │
│    └──────┘ └────┘ └────┘ └────┘ └─────┘            │
│                                                         │
│       ┌─────────────────────────────┐                  │
│       │  Langfuse (Analytics)       │                  │
│       │  Track tout en temps réel   │                  │
│       └─────────────────────────────┘                  │
└──────────────────────────────────────────────────────────┘
```

---

## 🚀 Installation (10 Minutes)

### Étape 1 : Prérequis

```bash
# Vérifier Docker
docker --version  # >= 20.10
docker compose version  # >= 2.0

# RAM recommandée
# Minimum : 8 GB
# Standard : 16 GB
# Optimal : 32 GB
```

### Étape 2 : Configuration

```bash
cd AI-Ultimate-Stack/

# Créer .env
cp .env.example .env

# Éditer (OBLIGATOIRE)
nano .env
```

**Configuration minimale** :
```bash
# 1. Obtenir une clé Groq (2 min)
# → https://console.groq.com/
GROQ_API_KEY=gsk_votre_cle_ici

# 2. Changer les secrets
LITELLM_MASTER_KEY=sk-votre-secret-unique
LANGFUSE_NEXTAUTH_SECRET=$(openssl rand -base64 32)
LANGFUSE_SALT=$(openssl rand -base64 32)
WEBUI_SECRET_KEY=$(openssl rand -base64 32)
```

### Étape 3 : Lancer

```bash
# Démarrer tout
docker compose up -d

# Suivre les logs
docker compose logs -f

# Attendre que tout soit prêt (2-5 min)
# Vérifier : docker compose ps
```

### Étape 4 : Vérifier

```bash
# Health checks
curl http://localhost:4000/health  # LiteLLM
curl http://localhost:8000/health  # AI Gateway
curl http://localhost:3002/api/public/health  # Langfuse

# Ou utiliser le script de validation
./scripts/validate-stack.sh
```

---

## 💡 Utilisation

### 🎨 Open WebUI (Interface Chat)

```bash
# Ouvrir dans le navigateur
open http://localhost:3000

# Premier accès :
# 1. Créer un compte admin
# 2. Sélectionner un modèle
# 3. Commencer à chatter !
```

**Fonctionnalités** :
- Chat avec n'importe quel modèle
- Upload de documents (RAG)
- Recherche web intégrée
- Historique des conversations
- Partage de chats

### 🦆 Goose (Agent Autonome)

```bash
# Session interactive
docker compose exec goose goose session

# Commande directe
docker compose exec goose goose "Create a Python FastAPI hello world"

# Multi-étapes
docker compose exec goose goose "
  1. Create a new Python project
  2. Add FastAPI and pytest
  3. Write a /users endpoint
  4. Write tests
  5. Create a Dockerfile
"
```

**Goose peut** :
- ✅ Exécuter des commandes
- ✅ Modifier des fichiers
- ✅ Utiliser Git
- ✅ Lancer Docker
- ✅ Naviguer dans votre code
- ✅ **Agir de manière autonome**

### 🔍 Perplexica (Recherche Web IA)

```bash
# Ouvrir dans le navigateur
open http://localhost:3001

# Exemple de recherche :
# "What are the latest developments in AI agents?"
```

**Perplexica** :
1. Recherche sur le web
2. Analyse les résultats avec l'IA
3. Génère une réponse synthétique avec sources

### ⚡ LiteLLM (Gateway Intelligent)

```bash
# API compatible OpenAI
curl http://localhost:4000/v1/chat/completions \
  -H "Authorization: Bearer sk-1234" \
  -H "Content-Type: application/json" \
  -d '{
    "model": "groq/llama-3.3-70b-versatile",
    "messages": [{"role": "user", "content": "Hello!"}]
  }'

# UI Admin
open http://localhost:4000/ui
```

**LiteLLM fait** :
- ✅ Cache les réponses (x10 vitesse)
- ✅ Load balancing automatique
- ✅ Retry si échec
- ✅ Fallback sur autre provider
- ✅ Rate limiting

### 📊 Langfuse (Analytics)

```bash
# Ouvrir le dashboard
open http://localhost:3002

# Première connexion :
# 1. Créer un compte
# 2. Créer un projet
# 3. Récupérer les clés API
# 4. Les ajouter dans .env
```

**Langfuse montre** :
- Toutes les requêtes IA
- Latences et performances
- Coûts (même si gratuit)
- Erreurs et debug
- Conversations complètes

---

## 🎯 Cas d'Usage Complets

### 1. Développement Assisté par IA

**Setup** :
```bash
# Dans VSCode
# 1. Installer extension "Tabby"
#    → Endpoint: http://localhost:8080
#
# 2. Installer extension "Continue"
#    → Base URL: http://localhost:4000/v1
#    → API Key: sk-1234
```

**Workflow** :
1. **Taper du code** → Tabby autocomplete ✨
2. **Besoin d'aide** → Continue.dev (Cmd/Ctrl+L)
3. **Tâche complexe** → Goose agent
4. **Recherche web** → Perplexica

### 2. Automatisation Complète avec Goose

```bash
# Goose comprend et exécute tout
docker compose exec goose goose "
  I need a new microservice:
  1. Create a Python FastAPI project
  2. Add endpoints for CRUD operations on users
  3. Use SQLAlchemy with PostgreSQL
  4. Add input validation with Pydantic
  5. Write comprehensive tests
  6. Create a Dockerfile with multi-stage build
  7. Add docker-compose.yml for dev
  8. Write README with API documentation
  9. Initialize git and make initial commit
"
```

Goose va **tout faire automatiquement** ! 🤯

### 3. Review de Code avec IA + Analytics

```bash
# Dans votre pipeline Woodpecker
steps:
  ai-review:
    image: python:3.11-slim
    commands:
      - pip install openai
      - |
        python << 'EOF'
        import openai
        
        client = openai.OpenAI(
            base_url="http://litellm:4000/v1",
            api_key="sk-1234"
        )
        
        response = client.chat.completions.create(
            model="groq/llama-3.3-70b-versatile",
            messages=[{
                "role": "user",
                "content": "Review this PR and suggest improvements"
            }]
        )
        
        print(response.choices[0].message.content)
        EOF
```

**Résultat** :
- Review instantanée (Groq < 1s)
- Trackée dans Langfuse
- Cachée dans Redis
- Si Groq down → fallback Ollama

### 4. Recherche + Génération

```bash
# Rechercher des infos récentes
# http://localhost:3001
# "What are the new features in Python 3.13?"

# Utiliser ces infos dans Open WebUI
# http://localhost:3000
# "Based on Python 3.13 features, write a modern async app"
```

---

## ⚡ Optimisations Incluses

### 1. Cache Redis (x10 Vitesse)

```python
# Requête 1 : 2 secondes (appel API)
response = client.chat("Explain async/await")

# Requête 2 (identique) : 0.02 seconde ! (cache)
response = client.chat("Explain async/await")
```

**Gain** : 100x plus rapide pour requêtes identiques

### 2. Load Balancing Automatique

```
Request 1 → Groq (rapide, disponible)
Request 2 → Groq (rate limit) → Together AI
Request 3 → Together AI (down) → Ollama
```

**Résultat** : Toujours une réponse, jamais de downtime

### 3. Retry Automatique

```python
# Plus besoin de gérer les erreurs
try:
    response = client.chat(...)  
    # LiteLLM retry automatiquement 3x
except:
    # Seulement si TOUS les providers ont échoué
    pass
```

### 4. Analytics Temps Réel

```
Langfuse Dashboard :
├─ Requêtes : 1,245 aujourd'hui
├─ Latence moyenne : 0.8s
├─ Provider le plus utilisé : Groq (95%)
├─ Coût : $0 (gratuit!)
├─ Taux d'erreur : 0.1%
└─ Cache hit rate : 45%
```

---

## 📊 Comparaison de Performance

### Sans Optimisations (Stack Basique)

```
Requête → Groq API → 1-2s
Si rate limit → ❌ Erreur
Si down → ❌ Erreur
Même requête → 1-2s (re-calcul)
```

### Avec Optimisations (Cette Stack)

```
Requête 1 → LiteLLM → Groq → 0.8s
  └─ Mise en cache Redis

Requête 2 (identique) → Redis → 0.02s ⚡
  └─ 40x plus rapide !

Requête 3 (rate limit) :
  LiteLLM → Groq ❌ → Together AI ✅ → 1.2s
  └─ Fallback automatique

Requête 4 (all providers down) :
  LiteLLM → Groq ❌ → Together ❌ → Ollama ✅ → 3s
  └─ Toujours une réponse !
```

**Résultat** :
- ✅ 40x plus rapide (cache)
- ✅ 99.9% uptime (fallback)
- ✅ Transparent pour l'utilisateur

---

## 🔧 Configuration Avancée

### Profils de Performance

#### Minimal (8 GB RAM)
```bash
OLLAMA_MODELS=llama3.2,nomic-embed-text
TABBY_MODEL=StarCoder-1B
OLLAMA_NUM_CTX=2048
```

#### Standard (16 GB RAM)
```bash
OLLAMA_MODELS=codellama,llama3.2,nomic-embed-text
TABBY_MODEL=StarCoder-3B
OLLAMA_NUM_CTX=4096
GROQ_API_KEY=<votre_clé>
```

#### Performance (32 GB RAM + GPU)
```bash
OLLAMA_MODELS=deepseek-coder,qwen2.5-coder,nomic-embed-text
TABBY_MODEL=DeepSeek-Coder-6.7B
TABBY_DEVICE=cuda
OLLAMA_NUM_GPU=999
GROQ_API_KEY=<votre_clé>
TOGETHER_API_KEY=<votre_clé>
```

### Activer Perplexica (Recherche Web)

```bash
# Démarrer avec Perplexica
docker compose --profile perplexica up -d

# Accéder
open http://localhost:3001
```

---

## 🐛 Troubleshooting

### LiteLLM ne démarre pas

```bash
# Vérifier les logs
docker compose logs litellm

# Problème courant : config.yaml invalide
# Vérifier la syntaxe YAML
```

### Cache Redis ne fonctionne pas

```bash
# Vérifier Redis
docker compose exec redis redis-cli ping
# Doit retourner : PONG

# Vérifier la connexion
docker compose logs litellm | grep redis
```

### Goose ne trouve pas les modèles

```bash
# Vérifier que LiteLLM est prêt
curl http://localhost:4000/v1/models

# Vérifier la config Goose
docker compose exec goose cat /root/.config/goose/config.yaml
```

### Langfuse n'enregistre pas

```bash
# Vérifier les clés dans .env
# LANGFUSE_PUBLIC_KEY et LANGFUSE_SECRET_KEY

# Les obtenir depuis Langfuse UI
open http://localhost:3002
# Settings → API Keys
```

---

## 🔒 Sécurité Production

### Checklist

- [ ] Changer **TOUS** les secrets par défaut
- [ ] Activer HTTPS (reverse proxy)
- [ ] Limiter accès réseau (localhost uniquement)
- [ ] Activer authentification partout
- [ ] Backups automatiques des volumes
- [ ] Monitoring (Langfuse + logs)
- [ ] Rate limiting strict
- [ ] Ne PAS exposer ports internes

### Générer des Secrets Forts

```bash
# Master key LiteLLM
openssl rand -base64 48

# Secrets Langfuse
openssl rand -base64 32

# Secret WebUI
openssl rand -base64 32
```

---

## 📈 Monitoring

### Dashboard Langfuse

```
URL : http://localhost:3002

Métriques :
├─ Requêtes totales
├─ Latence P50/P95/P99
├─ Coûts par provider
├─ Taux d'erreur
├─ Distribution des modèles
└─ Conversations complètes
```

### Logs Centralisés

```bash
# Tous les services
docker compose logs -f

# Service spécifique
docker compose logs -f litellm
docker compose logs -f ai-gateway
docker compose logs -f goose
```

---

## 🎁 Bonus : Intégration Forgejo

### Connecter avec la Stack Forgejo

```bash
# Créer réseau partagé
docker network create dev-bridge

# Connecter Forgejo
docker network connect dev-bridge forgejo
docker network connect dev-bridge woodpecker-server

# Connecter IA
docker network connect dev-bridge litellm
docker network connect dev-bridge ai-gateway
docker network connect dev-bridge goose
```

### Pipeline Woodpecker avec IA

```yaml
# .woodpecker.yml
steps:
  ai-review:
    image: python:3.11-slim
    commands:
      - pip install openai
      - |
        python << 'EOF'
        import openai
        client = openai.OpenAI(
            base_url="http://litellm:4000/v1",
            api_key="sk-1234"
        )
        # Review de code avec cache + fallback
        response = client.chat.completions.create(...)
        EOF
```

---

## ✅ Checklist Finale

- [ ] Docker + Docker Compose installés
- [ ] Clé Groq obtenue (gratuit)
- [ ] `.env` configuré
- [ ] Secrets changés
- [ ] Stack démarrée : `docker compose up -d`
- [ ] Services healthy : `docker compose ps`
- [ ] Open WebUI accessible : http://localhost:3000
- [ ] Langfuse configuré : http://localhost:3002
- [ ] Goose testé : `docker compose exec goose goose session`
- [ ] Cache Redis actif
- [ ] Intégré dans IDE (Tabby + Continue.dev)

---

## 🎉 Vous Avez Maintenant

✅ **9 Services IA** ultra-optimisés  
✅ **Cache Redis** (x10-100 vitesse)  
✅ **Load Balancing** automatique  
✅ **Fallback** multi-providers  
✅ **Analytics** temps réel  
✅ **Agent Autonome** (Goose)  
✅ **Interface Moderne** (Open WebUI)  
✅ **Recherche Web IA** (Perplexica)  
✅ **100% Auto-hébergé** et gratuit  

**La stack IA la plus complète et optimisée du marché ! 🚀**

---

<div align="center">

**Fait avec ❤️ pour les développeurs**

*Stack optimisée avec 15 ans d'expertise*

</div>

<!-- AI-STACK-BILAN-START -->
## 🏆 Statut du Déploiement

> **Dernière validation :** `2026-02-17 07:02 UTC` | [Voir le run GitHub Actions](https://github.com/MX10-AC2N/ForgeNest/actions/runs/22088951751)

### ✅ Tests de Validation (10/10)

| # | Service | Statut | Description |
|---|---------|--------|-------------|
| 1 | Redis | ✅ PASS | Cache opérationnel |
| 2 | Langfuse | ✅ PASS | Analytics & observabilité |
| 3 | ClickHouse | ✅ PASS | Base analytique v26.1.2 |
| 4 | Ollama | ✅ PASS | LLM local (llama3.2:1b) |
| 5 | LiteLLM | ✅ PASS | Gateway + load balancing |
| 6 | AI Gateway | ✅ PASS | API unifiée |
| 7 | Goose | ✅ PASS | Agent autonome |
| 8 | MinIO S3 | ✅ PASS | Stockage objets |
| 9 | Open WebUI | ✅ PASS | Interface chat |
| 10 | E2E LiteLLM→Ollama | ✅ PASS | Flux complet validé |

---

### 💾 Espace Disque Requis

> Mesuré automatiquement sur GitHub Actions (Ubuntu 24.04, `ubuntu-latest`)

#### Images Docker

| Image | Taille |
|-------|--------|
| `ollama/ollama:latest` | 8.96GB |
| `ghcr.io/berriai/litellm:main-latest` | 5.56GB |
| `langfuse/langfuse:3` | 1.35GB |
| `clickhouse/clickhouse-server:latest` | 1.12GB |
| `minio/minio:latest` | 241MB |
| `postgres:15-alpine` | 392MB |
| `redis:7-alpine` | 61.2MB |
| `ghcr.io/open-webui/open-webui:main` | 6.54GB |
| `AI Gateway` (custom build) | ~220 MB |
| `Goose` (custom build) | ~300 MB |

#### Récapitulatif

| Catégorie | Espace estimé |
|-----------|--------------|
| **Toutes les images Docker** | ~9–10 GB |
| **Modèle `llama3.2:1b` (CI/test)** | ~1.3 GB |
| **Modèle `llama3.2` (recommandé)** | ~2.0 GB |
| **Données Langfuse (Postgres + ClickHouse)** | ~500 MB (croissant) |
| **Cache Redis** | < 50 MB |
| **Stockage MinIO** | ~100 MB (croissant) |
| **⚡ TOTAL minimum recommandé** | **~12 GB libres** |

> ⚠️ `open-webui` représente ~3.5 GB. Il peut être désactivé pour économiser de l'espace.

#### Prérequis Système

| Ressource | Minimum | Recommandé |
|-----------|---------|------------|
| **RAM** | 8 GB | 16 GB |
| **CPU** | 4 cœurs | 8 cœurs |
| **Disque** | 20 GB | 40 GB |
| **Disque avec modèles >7B** | +4 GB/modèle | +8 GB/modèle |

---

### ⚡ Temps de Démarrage

| Phase | Durée |
|-------|-------|
| Pull images (1er lancement) | 5–15 min selon connexion |
| Build images custom (ai-gateway, goose) | 1–3 min |
| Démarrage infrastructure (redis, minio, db) | < 1 min |
| Migrations Langfuse (Postgres + ClickHouse) | 3–5 min |
| **Total 1er lancement** | **~10–25 min** |
| **Relancement (images en cache)** | **~2–3 min** |

---

### 🌐 Ports Exposés

| Port | Service | URL |
|------|---------|-----|
| `3000` | Open WebUI | http://localhost:3000 |
| `3001` | Perplexica | http://localhost:3001 |
| `3002` | Langfuse | http://localhost:3002 |
| `4000` | LiteLLM + UI Admin | http://localhost:4000 |
| `8000` | AI Gateway | http://localhost:8000 |
| `8080` | Tabby (code) | http://localhost:8080 |
| `11434` | Ollama API | http://localhost:11434 |

---

### 🤖 Modèles Ollama Disponibles

| Modèle | Taille | RAM requise | Usage |
|--------|--------|-------------|-------|
| `llama3.2:1b` | ~1.3 GB | 4 GB | Tests, usage léger |
| `llama3.2` | ~2.0 GB | 8 GB | **Usage quotidien recommandé** |
| `codellama` | ~3.8 GB | 8 GB | Génération de code |
| `deepseek-coder` | ~3.8 GB | 8 GB | Analyse de code |
| `qwen2.5-coder:7b` | ~4.7 GB | 12 GB | Code avancé |

> 💡 `docker compose exec ollama ollama pull llama3.2` pour télécharger un modèle

<!-- AI-STACK-BILAN-END -->
