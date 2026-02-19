# Self-Attention - Implementação Educacional

Uma implementação clara e bem-documentada do mecanismo de Self-Attention, elemento fundamental dos Transformers modernos.

## 📋 Características

✅ **Código limpo e legível** - Nomes de variáveis descritivos (ex: `query_matrix`, `attention_weights`)  
✅ **Tipagem completa** - Type hints em todo o código  
✅ **Docstrings robustas** - Documentação detalhada de classes e métodos  
✅ **Validação de entrada** - Tratamento abrangente de erros de dimensão  
✅ **Benchmark incluído** - Comparação de performance para diferentes tamanhos  
✅ **Suite de testes extensiva** - 16+ testes validando comportamento  

## 🚀 Início Rápido

### Instalação

```bash
# Só precisa do NumPy
pip install numpy
```

### Uso Básico

```python
import numpy as np
from attention import SelfAttention

# Cria o módulo de atenção
attention = SelfAttention()

# Prepara dados (seq_length=2, feature_dim=3)
query_matrix = np.array([[1.0, 0.0, 1.0],
                         [0.0, 1.0, 0.0]], dtype=np.float32)
key_matrix = np.array([[1.0, 0.0, 1.0],
                       [0.0, 1.0, 0.0]], dtype=np.float32)
value_matrix = np.array([[1.0, 2.0],
                        [3.0, 4.0]], dtype=np.float32)

# Calcula atenção
attention_output, attention_weights = attention.forward(
    query_matrix, key_matrix, value_matrix
)

print("Output shape:", attention_output.shape)  # (2, 2)
print("Pesos:\n", attention_weights)
print("Output:\n", attention_output)
```

## 📐 Arquitetura

### Self-Attention

A fórmula matemática implementada:

```
Attention(Q, K, V) = softmax(Q·K^T / √d_k) · V
```

Onde:
- **Q** (Query): O que estamos procurando
- **K** (Key): O que temos disponível
- **V** (Value): A informação que queremos recuperar  
- **d_k**: Dimensão das chaves (usado para escaling)

### Fluxo de Cálculo

```
1. Scores = Q @ K^T              # Compatibilidade entre queries e keys
2. Scaled = Scores / √d_k        # Normalization
3. Weights = softmax(Scaled)     # Probabilidades de atenção
4. Output = Weights @ V          # Agregação ponderada dos valores
```

## 📊 Exemplos de Uso

### Com Máscara Causal (Para Geração Sequencial)

```python
import numpy as np
from attention import SelfAttention

attention = SelfAttention()
seq_length = 5

# Dados de sequência
query = np.random.randn(seq_length, 64)
key = np.random.randn(seq_length, 64)
value = np.random.randn(seq_length, 32)

# Máscara causal: posição i não pode atender posições j > i
causal_mask = np.tril(np.ones((seq_length, seq_length), dtype=bool))

output, weights = attention.forward(query, key, value, mask=causal_mask)

print("Pesos com máscara:")
print(weights)
# Valores acima da diagonal serão 0
```

### Com Diferentes Dimensões

```python
# Sequência de 100 tokens, embedding 512, output 256
query = np.random.randn(100, 512)
key = np.random.randn(100, 512)
value = np.random.randn(100, 256)  # Output dimension pode diferir

output, weights = attention.forward(query, key, value)

assert output.shape == (100, 256), "Output tem dimensão correta"
assert weights.shape == (100, 100), "Weights é uma matriz quadrada"
```

## ✋ Tratamento de Erros

A implementação valida entradas automaticamente:

```python
# ❌ Dimension mismatch (Q e K têm dimensões diferentes)
query = np.random.randn(5, 8)
key = np.random.randn(5, 16)  # Erro!
value = np.random.randn(5, 8)
attention.forward(query, key, value)  # Levanta ValueError

# ❌ Input não é numpy array
query = [[1.0, 2.0], [3.0, 4.0]]  # Lista, não array
attention.forward(query, key, value)  # Levanta TypeError

# ❌ Sequência vazia
query = np.random.randn(0, 8)
attention.forward(query, key, value)  # Levanta ValueError
```

## 🧪 Testes

Executa a suite completa de testes:

```bash
python test_attention.py
```

Inclui testes para:

- ✓ Formas de saída corretas
- ✓ Propriedades matemáticas (softmax soma a 1)
- ✓ Validação de dimensões
- ✓ Máscara causal
- ✓ Diferentes tamanhos de sequência
- ✓ Tratamento de erros
- ✓ Benchmark de performance

### Saída Esperada

```
======================================================================
TESTES DE SELF-ATTENTION
======================================================================

[TESTES BÁSICOS]
✓ Forward pass retorna shape correto
✓ Pesos de atenção têm shape correto
...

[BENCHMARK DE PERFORMANCE]
Tamanho      | Seq Len | Features | Tempo (ms) | Ops/sec
------------------------------------------------------------
Pequeno      |      10 |       64 |      0.234 |   27.45G
Médio        |     100 |      256 |      2.156 |   24.32G
...

======================================================================
RESULTADO: 16/16 testes passaram (100.0%)
======================================================================
```

## 📈 Performance

Benchmark de velocidade em diferentes configurações:

| Tamanho | Seq Length | Features | Tempo (ms) |
|---------|-----------|----------|-----------|
| Pequeno | 10 | 64 | ~0.2 |
| Médio | 100 | 256 | ~2.0 |
| Grande | 500 | 512 | ~50.0 |
| Muito Grande | 1000 | 1024 | ~400.0 |

*Valores indicativos em CPU. GPU seria muito mais rápida.*

## 📚 Conceitos-Chave

### Por que Escaling?

O scaling por √d_k previne que os gradientes desapareçam durante backpropagation:

```python
# Sem scaling: scores muito grandes
scores = Q @ K.T  # Valores em range [-1000, 1000]
weights = softmax(scores)  # Picos muito agudos, gradientes → 0

# Com scaling: scores moderados  
scores = (Q @ K.T) / sqrt(d_k)  # Valores em range [-5, 5]
weights = softmax(scores)  # Distribuição suave, gradientes bons
```

### Estabilidade Numérica

O softmax é implementado com subtração do máximo para evitar overflow:

```python
# ❌ Problematisch (pode overflow)
exp_scores = np.exp(scores)

# ✅ Estável (numericamente seguro)
shifted = scores - np.max(scores, axis=1, keepdims=True)
exp_scores = np.exp(shifted)
```

### Máscara Causal

Essencial para modelos autoregressivos (como GPT):

```
Sem máscara:        Com máscara:
[1, 1, 1]          [1, 0, 0]
[1, 1, 1]          [1, 1, 0]
[1, 1, 1]          [1, 1, 1]

Cada posição vê tudo    Cada posição vê apenas anteriores
```

## 🔧 Estrutura do Código

```
self-attention/
├── attention.py        # Implementação da classe SelfAttention (160+ linhas)
├── test_attention.py   # Suite de testes (400+ linhas)
└── README.md          # Este arquivo
```

### Arquivos

**attention.py:**
- `SelfAttention`: Classe principal
  - `forward()`: Calcula atenção
  - `_validate_input_dimensions()`: Valida entrada
  - `_softmax()`: Softmax estável

**test_attention.py:**
- `TestSelfAttention`: Suite de testes
  - 16+ testes unitários
  - Benchmark de performance
  - Validação de erros

## 💡 Próximos Passos

Para expandir este projeto:

1. **Multi-Head Attention** - Múltiplas cabeças em paralelo
2. **Scaled & Position Encoding** - Adicionar posições na sequência
3. **PyTorch Version** - Implementação com autograd
4. **Causal + Padding Mask** - Máscaras combinadas
5. **Cross-Attention** - Atenção entre sequências diferentes

## 📖 Referências

- "Attention is All You Need" (Vaswani et al., 2017)
- https://arxiv.org/abs/1706.03762

## 📝 Licença

Código educacional - Livre para usar e modificar.

---

**Autor:** Laboratório de Programação (LabP1)  
**Data:** 2026  
**Status:** ✅ Pronto para uso
