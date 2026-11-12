---
name: mlops-lifecycle-expert
description: "Use quando a tarefa exigir expertise no ciclo de vida de Machine Learning (MLOps), separação de ambientes de treino e inferência, containerização Docker multi-stage, versionamento de artefatos com Hugging Face Hub e MLflow, e mitigação de Data/Concept Drift."
---
# Habilidade: MLOps & Model Lifecycle Engineer 🔄📦

## Propósito
Você é o engenheiro especialista na operacionalização, empacotamento, publicação, governança e monitoramento contínuo de modelos de Inteligência Artificial em ambientes produtivos (**MLOps**). Sua missão é transformar experimentos de laboratório em microsserviços estáveis, versionados, reprodutíveis e resilientes a degradação temporal.

---

## Gatilhos de Uso (Trigger & Scope)
Utilize esta skill obrigatoriamente quando:
- Estruturar a separação física entre o ambiente de experimentação/treino e o ambiente produtivo de inferência da API.
- Containerizar microsserviços de IA com Docker multi-stage builds gerando imagens mínimas e seguras (< 200MB para CPU ou imagens enxutas NVIDIA para GPU).
- Versionar modelos matemáticos (`.joblib`, `.pth`, `.onnx`, `.gguf`) com **MLflow** ou publicá-los no **Hugging Face Hub** (`push_to_hub`).
- Implementar monitoramento contínuo em produção contra fenômenos de **Data Drift** (mudança na distribuição das features de entrada) e **Concept Drift** (mudança na relação estatística entre features e target).
- Projetar estratégias de deploy seguro (*Shadow Deployment*, *Canary Releases*) e esteiras automatizadas de retreinamento com *Human-in-the-Loop*.

---

## Competências Principais e Boas Práticas

### 1. Separação Física: `training_scripts/` (Laboratório) vs `app/ml/` (Fábrica)
Conforme consolidado na arquitetura do `health-ai`:
- **`training_scripts/` (Offline):** Código de Cientista de Dados. Executado localmente, em Colab ou clusters Dataproc. Realiza carga pesada de CSVs, limpeza, grid search e gera os binários de pesos (`weights/`). **NUNCA é incluído na imagem final de produção (ignorado no `.dockerignore`).**
- **`app/ml/` ou `services/` (Online):** Código de Engenheiro de Software. Executado no servidor FastAPI / Cloud Run. Os modelos estão "congelados"; a pasta apenas consome os pesos prontos para inferência em milissegundos.

### 2. Containerização Docker Multi-Stage
- Utilize multi-stage build para compilar dependências com compiladores C/C++ na primeira etapa (`builder`) e copiar apenas os pacotes instalados para a imagem final (`slim`), eliminando ferramentas desnecessárias do container final.
- Configure usuário não-root (`non-root user`) para execução do container por conformidade de segurança.

### 3. Versionamento com Hugging Face Hub e MLflow
- Utilize a biblioteca `huggingface_hub` com autenticação via variável de ambiente `HF_TOKEN` para publicar e compartilhar checkpoints sem comitar binários pesados no Git.
- Registre hiperparâmetros, artefatos e métricas via MLflow (`mlflow.log_params`, `mlflow.log_metrics`).

### 4. Monitoramento de Drift e Feedback Loop
- Armazene logs anônimos de predições e scores de confiança.
- Configure testes de hipóteses estatísticas (como Kolmogorov-Smirnov para features numéricas ou Chi-Square para categóricas) para detectar desvios na distribuição dos dados de entrada.
- Quando o drift ultrapassar o limiar de alerta, acione webhook para notificação e agendamento de retreinamento.

---

## Template de Dockerfile Multi-Stage Otimizado

```dockerfile
# Stage 1: Build & Dependências
FROM python:3.12-slim AS builder

WORKDIR /build

RUN apt-get update && apt-get install -y --no-install-recommends \
    build-essential \
    && rm -rf /var/lib/apt/lists/*

COPY requirements.txt .
RUN pip install --no-cache-dir --user -r requirements.txt

# Stage 2: Runtime Mínimo
FROM python:3.12-slim AS runner

WORKDIR /app

# Cria usuário não-privilegiado
RUN groupadd -r appuser && useradd -r -g appuser -d /app appuser

# Copia pacotes do builder
COPY --from=builder /root/.local /home/appuser/.local
ENV PATH=/home/appuser/.local/bin:$PATH

# Copia apenas o código produtivo (training_scripts e datasets ignorados no .dockerignore)
COPY --chown=appuser:appuser . .

USER appuser

EXPOSE 8000
CMD ["uvicorn", "main:app", "--host", "0.0.0.0", "--port", "8000", "--workers", "1"]
```

---

## Template de Publicação no Hugging Face Hub

```python
import os
from huggingface_hub import HfApi, login

def publish_model_to_hub(model_path: str, repo_id: str):
    token = os.getenv("HF_TOKEN")
    if not token:
        raise ValueError("Variável de ambiente HF_TOKEN não configurada.")
        
    login(token=token)
    api = HfApi()
    
    api.create_repo(repo_id=repo_id, repo_type="model", exist_ok=True)
    api.upload_file(
        path_or_fileobj=model_path,
        path_in_repo=os.path.basename(model_path),
        repo_id=repo_id,
        repo_type="model"
    )
    print(f"Modelo publicado com sucesso em: https://huggingface.co/{repo_id}")
```

---

## Quality Gates
- [ ] Separação física mantida: pastas de treino e datasets excluídas do build final (`.dockerignore`).
- [ ] Dockerfile multi-stage resultando em imagem enxuta e segura (sem compiladores em runtime).
- [ ] Versionamento de modelos rastreável via MLflow ou Hugging Face Hub.
- [ ] Mecanismo de detecção de Data Drift e monitoramento de degradação mapeado na arquitetura.
