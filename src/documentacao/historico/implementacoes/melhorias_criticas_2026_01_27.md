# Melhorias Críticas Implementadas - 2026-01-27

**Data:** 2026-01-27  
**Contexto:** Análise de resultados e correção de problemas identificados  
**Status:** ✅ Implementado e pronto para testes

---

## 📋 Contexto

Após análise dos resultados de treinamento dos modelos CNN-LSTM para PETR4, ITUB4 e VALE3, foram identificados problemas críticos:

1. **F1=0.0 e MCC=0.0** em alguns folds (PETR4 folds 2 e 3)
   - Modelo prevendo sempre a mesma classe
   - Indica que modelo não está aprendendo padrões reais

2. **Acurácias abaixo do esperado** em alguns folds
   - PETR4 Fold 3: 47.15% (abaixo do baseline)
   - ITUB4 Fold 5: 50.00% (exatamente no acaso)

3. **Falta de técnicas do TCC** ainda não implementadas
   - Cosine Annealing Scheduler (Seção 4.4)
   - Class weights melhorados

---

## ✅ Melhorias Implementadas

### 1. Cosine Annealing Scheduler (TCC Seção 4.4)

**Problema:**  
Apenas `ReduceLROnPlateau` estava implementado. O TCC menciona uso de schedulers avançados como Cosine Annealing para melhorar convergência.

**Solução:**  
Implementado `CosineDecayRestarts` do TensorFlow, que reduz learning rate seguindo curva cosseno com restarts periódicos.

**Arquivos modificados:**
- `src/train.py` - Função `treinar_modelo_fold()`
- `src/utils/optuna_optimizer.py` - Funções `objetivo_lstm()` e `objetivo_cnn_lstm()`

**Implementação:**
```python
from tensorflow.keras.optimizers.schedules import CosineDecayRestarts
from tensorflow.keras.callbacks import LearningRateScheduler

# Criar schedule de cosine annealing com restarts
cosine_schedule = CosineDecayRestarts(
    initial_learning_rate=initial_lr,
    first_decay_steps=max(epochs // 2, 10),  # Primeira metade das épocas
    t_mul=2.0,  # Multiplicador de período (dobra período a cada restart)
    m_mul=1.0,  # Multiplicador de learning rate mínimo
    alpha=1e-7  # Learning rate mínimo
)

# Adicionar callback
callbacks_list.append(
    LearningRateScheduler(
        lambda epoch: cosine_schedule(epoch).numpy(),
        verbose=0
    )
)
```

**Justificativa:**
- Cosine annealing permite convergência mais suave
- Restarts periódicos ajudam a escapar de mínimos locais
- Conforme mencionado no TCC Seção 4.4 sobre técnicas de otimização

**Benefício esperado:** +1-3% acurácia

---

### 2. Class Weights Melhorados (sklearn)

**Problema:**  
Cálculo manual de class weights estava causando modelos que previam sempre a mesma classe, resultando em F1=0.0 e MCC=0.0.

**Código anterior:**
```python
n_class_0 = np.sum(y_train_binary == 0)
n_class_1 = np.sum(y_train_binary == 1)
total = len(y_train_binary)

weight_0 = total / (2 * n_class_0)
weight_1 = total / (2 * n_class_1)
class_weight = {0: weight_0, 1: weight_1}
```

**Problemas identificados:**
- Cálculo manual pode não ser ótimo para casos extremos
- Não detecta quando há apenas uma classe
- Pode não balancear adequadamente

**Solução:**  
Substituído por `sklearn.utils.class_weight.compute_class_weight` com estratégia 'balanced'.

**Código novo:**
```python
from sklearn.utils.class_weight import compute_class_weight

if len(np.unique(y_train_binary)) > 1:
    classes = np.unique(y_train_binary)
    weights = compute_class_weight(
        'balanced',
        classes=classes,
        y=y_train_binary
    )
    class_weight = {int(cls): float(weight) for cls, weight in zip(classes, weights)}
else:
    class_weight = None
    if verbose > 0:
        print(f"     [AVISO] Apenas uma classe presente no treino!")
```

**Arquivos modificados:**
- `src/train.py` - Função `treinar_modelo_fold()`
- `src/utils/optuna_optimizer.py` - Funções `objetivo_lstm()` e `objetivo_cnn_lstm()`

**Benefícios:**
- Cálculo mais robusto e testado
- Detecta casos extremos (apenas uma classe)
- Previne colapso para mesma classe
- Melhora F1-Score e MCC

---

### 3. Monitoramento de Distribuição de Previsões

**Problema:**  
Não havia alertas quando modelo previa sempre a mesma classe durante otimização.

**Solução:**  
Adicionado monitoramento detalhado e avisos quando modelo colapsa.

**Implementação:**
```python
# Debug: verificar se o modelo está variando
n_pred_1 = np.sum(y_pred_direcao == 1)
n_pred_neg1 = np.sum(y_pred_direcao == -1)

# Aviso se modelo prevê sempre mesma classe
warning = ""
if n_pred_1 == 0 or n_pred_neg1 == 0:
    warning = " ⚠️ MODELO PREVÊ SEMPRE MESMA CLASSE!"

print(f"     Trial {trial.number}: Pred=[1:{n_pred_1}, -1:{n_pred_neg1}], "
      f"Val=[1:{n_val_1}, -1:{n_val_neg1}], "
      f"Proba=[{pred_min:.3f}-{pred_max:.3f}, mean={pred_mean:.3f}, std={pred_std:.3f}], "
      f"Acc={acuracia:.4f}{warning}")
```

**Arquivo modificado:**
- `src/utils/optuna_optimizer.py` - Função `objetivo_cnn_lstm()`

**Benefícios:**
- Identificação imediata de problemas durante otimização
- Facilita debugging
- Permite ajustes rápidos

---

## 📊 Resultados Esperados

### Antes das Melhorias:
- **VALE3:** 53.31% (OK)
- **PETR4:** 50.57% (com F1=0.0 em folds 2 e 3) ⚠️
- **ITUB4:** 52.27% (OK)

### Após Melhorias (Esperado):
- **VALE3:** 55-57% (+2-4%)
- **PETR4:** 52-54% (+2-4%, sem F1=0.0) ✅
- **ITUB4:** 54-56% (+2-4%)

**Melhorias específicas:**
- ✅ Eliminação de F1=0.0 e MCC=0.0
- ✅ Acurácias mais consistentes entre folds
- ✅ Melhor convergência dos modelos

---

## 🧪 Validação e Testes

### Teste Rápido (1 fold problemático):
```bash
# A partir da raiz do repositório
uv run python src/train.py --ativo PETR4 --modelo cnn_lstm \
    --optuna --n-trials 20 --epochs 100 --folds 3
```

**Objetivo:** Verificar se fold 3 (que tinha 47.15% e F1=0.0) melhora.

### Treinamento Completo:
```bash
uv run python src/train.py --ativo PETR4 --modelo cnn_lstm \
    --optuna --n-trials 50 --epochs 150
```

**Objetivo:** Retreinar todos os folds e comparar resultados.

---

## 📝 Referências ao TCC

### Seção 4.4 - Treinamento e Otimização

**Técnicas mencionadas:**
- ✅ Walk-forward validation
- ✅ Otimização bayesiana (Optuna)
- ✅ AdamW optimizer
- ✅ Gradient clipping
- ✅ Early stopping
- ✅ ReduceLROnPlateau
- ✅ **Cosine Annealing Scheduler** ← NOVO
- ✅ Class weights
- ✅ Banda morta

**Status:** Todas as técnicas principais da Seção 4.4 agora estão implementadas.

---

## 🔄 Próximos Passos

### Fase 2: Features Adicionais (Prioridade Média)
- Amplitude high-low normalizada
- Variações de volume
- Hora do dia (sin/cos encoding)
- Fase do pregão

**Benefício esperado:** +2-5% acurácia

### Fase 3: Ensemble (Prioridade Média)
- Voting dos 5 folds
- Média ponderada de probabilidades

**Benefício esperado:** +3-5% acurácia

---

## ✅ Checklist de Implementação

- [x] Cosine Annealing Scheduler implementado
- [x] Class weights melhorados (sklearn)
- [x] Monitoramento de distribuição adicionado
- [x] Documentação criada
- [ ] Testado em fold problemático
- [ ] Retreinar todos os ativos
- [ ] Comparar resultados antes/depois

---

## 📌 Notas Técnicas

### Por que Cosine Annealing?
- Reduz learning rate de forma suave (curva cosseno)
- Restarts periódicos permitem explorar novos mínimos
- Melhor que redução abrupta (ReduceLROnPlateau)
- Conforme literatura de deep learning para séries temporais

### Por que sklearn class_weight?
- Algoritmo testado e validado
- Estratégia 'balanced' é padrão da literatura
- Detecta casos extremos automaticamente
- Mais robusto que cálculo manual

### Impacto nas Métricas
- **F1-Score:** Deve melhorar significativamente (eliminar zeros)
- **MCC:** Deve melhorar (melhor correlação)
- **Acurácia:** Melhoria moderada (+2-4%)
- **Consistência:** Menos variação entre folds

---

**Próxima atualização:** Após testes e validação dos resultados.
