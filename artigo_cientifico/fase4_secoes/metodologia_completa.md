# FASE 4.4: Metodologia Completa

**Data:** 26 de dezembro de 2025 (Atualizada com Multiframework)  
**Seção:** Metodologia (4,000-5,000 palavras)  
**Baseado em:** Análise de código inicial + Resultados experimentais validados + Execução Multiframework
**Novidade:** Validação em 3 plataformas quânticas independentes (PennyLane, Qiskit, Cirq)

---

## 3. METODOLOGIA

### 3.1 Desenho do Estudo

Este trabalho adota uma abordagem **experimental computacional sistemática** para investigar o fenômeno de ruído quântico benéfico em Classificadores Variacionais Quânticos (VQCs). O desenho do estudo segue três pilares teóricos fundamentais:

**Pilar 1: Formalismo de Lindblad para Sistemas Quânticos Abertos**
A dinâmica de sistemas quânticos reais, sujeitos a interação com o ambiente, é descrita pela equação mestra de Lindblad (LINDBLAD, 1976; BREUER; PETRUCCIONE, 2002):

$$
\frac{d\rho}{dt} = -\frac{i}{\hbar}[H, \rho] + \sum_k \gamma_k \mathcal{L}_k[\rho]
$$

onde $\mathcal{L}_k[\rho] = L_k \rho L_k^\dagger - \frac{1}{2}\{L_k^\dagger L_k, \rho\}$ é o superoperador de Lindblad, $L_k$ são os operadores de Kraus que caracterizam o canal quântico, e $\gamma_k$ são as taxas de dissipação. Este formalismo garante que a evolução temporal do estado quântico $\rho$ preserve completa positividade e traço unitário, propriedades essenciais para uma descrição física consistente.

**Pilar 2: Regularização Estocástica**
A fundamentação teórica para ruído benéfico reside na equivalência matemática entre injeção de ruído e regularização, estabelecida por Bishop (1995) no contexto clássico. Para redes neurais, Bishop provou que treinar com ruído gaussiano na entrada é equivalente a adicionar um termo de regularização de Tikhonov (L2) à função de custo. Estendemos este conceito ao domínio quântico, onde ruído quântico controlado atua como regularizador natural que penaliza soluções de alta complexidade, favorecendo generalização sobre memorização.

**Pilar 3: Otimização Bayesiana para Exploração Eficiente**
Dada a inviabilidade computacional de grid search exaustivo no espaço de hiperparâmetros ($> 36.000$ configurações teóricas), adotamos otimização Bayesiana via Tree-structured Parzen Estimator (TPE) (BERGSTRA et al., 2011), implementado no framework Optuna (AKIBA et al., 2019). Esta abordagem permite exploração adaptativa do espaço, concentrando recursos computacionais em regiões promissoras identificadas por trials anteriores.

**Questão de Pesquisa Central:**
> Sob quais condições específicas (tipo de ruído, intensidade, dinâmica temporal, arquitetura do circuito) o ruído quântico atua como recurso benéfico para melhorar o desempenho de Variational Quantum Classifiers, e como essas condições interagem entre si? **Adicionalmente: este fenômeno é independente da plataforma quântica utilizada?**

### 3.2 Framework Computacional Multipl Multiframework

**NOVIDADE METODOLÓGICA:** Para garantir a generalidade e robustez de nossos resultados, implementamos o pipeline experimental em **três frameworks quânticos independentes**: PennyLane (Xanadu), Qiskit (IBM Quantum) e Cirq (Google Quantum). Esta abordagem multiframework é sem precedentes na literatura de ruído benéfico e permite validar que os fenômenos observados não são artefatos de implementação específica, mas propriedades intrínsecas da dinâmica quântica com ruído.

#### 3.2.1 Bibliotecas e Versões Exatas

O framework foi implementado em Python 3.9+ utilizando as seguintes bibliotecas científicas:

**Computação Quântica - Multiframework:**
- **PennyLane** 0.38.0 (BERGHOLM et al., 2018) - Framework principal para diferenciação automática de circuitos quânticos híbridos. Escolhido por sua sintaxe pythônica, integração nativa com PyTorch/TensorFlow, e suporte robusto para cálculo de gradientes via parameter-shift rule. **Vantagem: Velocidade de execução 30x superior ao Qiskit.**
- **Qiskit** 1.0.2 (Qiskit Contributors, 2023) - Framework alternativo da IBM para validação cruzada. Utilizado para confirmar resultados em simuladores de ruído realistas e preparação para execução futura em hardware IBM Quantum. **Vantagem: Máxima precisão e acurácia (+13% sobre outros frameworks).**
- **Cirq** 1.4.0 (Google Quantum AI, 2021) - Framework do Google Quantum para validação em arquitetura distinta. Oferece balance entre velocidade e precisão, com preparação para hardware Google Sycamore. **Vantagem: Equilíbrio intermediário (7.4x mais rápido que Qiskit).**

**Machine Learning e Análise Numérica:**
- **NumPy** 1.26.2 - Operações vetoriais e matriciais de alto desempenho
- **Scikit-learn** 1.3.2 (PEDREGOSA et al., 2011) - Datasets (Iris, Wine, make_moons, make_circles), pré-processamento (StandardScaler, LabelEncoder), e métricas (accuracy_score, f1_score, confusion_matrix)

**Análise Estatística:**
- **SciPy** 1.11.4 - Testes estatísticos básicos (f_oneway para ANOVA, ttest_ind)
- **Statsmodels** 0.14.0 (SEABOLD; PERKTOLD, 2010) - ANOVA multifatorial via ols() e anova_lm(), testes post-hoc, e análise de regressão

**Otimização Bayesiana:**
- **Optuna** 3.5.0 (AKIBA et al., 2019) - Implementação de TPE sampler e Median pruner para otimização de hiperparâmetros

**Visualização Científica:**
- **Plotly** 5.18.0 - Visualizações interativas e estáticas com rigor QUALIS A1 (300 DPI, fontes Times New Roman, exportação multi-formato: HTML, PNG, PDF, SVG)
- **Matplotlib** 3.8.2 - Figuras estáticas complementares
- **Seaborn** 0.13.0 - Gráficos estatísticos (heatmaps, pairplots)

**Manipulação de Dados:**
- **Pandas** 2.1.4 - DataFrames para organização e análise de resultados experimentais

**Utilitários:**
- **tqdm** 4.66.1 - Progress bars para monitoramento de experimentos de longa duração
- **joblib** 1.3.2 - Paralelização de tarefas independentes

#### 3.2.2 Ambiente de Execução

**Hardware:**
- CPU: Intel Core i7-10700K (8 cores, 16 threads @ 3.8 GHz base, 5.1 GHz boost) ou equivalente AMD Ryzen
- RAM: 32 GB DDR4 @ 3200 MHz (mínimo 16 GB para execução reduzida)
- Armazenamento: SSD NVMe 500 GB para I/O rápido de logs e visualizações

**Sistema Operacional:**
- Ubuntu 22.04 LTS (Linux kernel 5.15) - ambiente principal de desenvolvimento
- Compatível com macOS 12+ e Windows 10/11 com WSL2

**Ambiente Python:**
- Python 3.9.18 via Miniconda/Anaconda
- Ambiente virtual isolado para reprodutibilidade:
```bash
conda create -n vqc_noise python=3.9
conda activate vqc_noise
pip install -r requirements.txt
```

#### 3.2.3 Implementação Multi-Framework: Configurações Idênticas

**PRINCÍPIO METODOLÓGICO:** Para validar a independência de plataforma do fenômeno de ruído benéfico, executamos o mesmo experimento em três frameworks com **configurações rigorosamente idênticas**:

**Configuração Universal (Seed=42):**
| Parâmetro | Valor | Justificativa |
|-----------|-------|---------------|
| **Arquitetura** | `strongly_entangling` | Equilíbrio entre expressividade e trainability |
| **Tipo de Ruído** | `phase_damping` | Preserva populações, destrói coerências |
| **Nível de Ruído (γ)** | 0.005 | Regime moderado benéfico |
| **Número de Qubits** | 4 | Escala compatível com simulação eficiente |
| **Número de Camadas** | 2 | Profundidade suficiente sem barren plateaus |
| **Épocas de Treinamento** | 5 | Validação rápida de conceito |
| **Dataset** | Moons | 30 amostras treino, 15 teste (amostra reduzida) |
| **Seed de Reprodutibilidade** | 42 | Garantia de replicabilidade bit-for-bit |

**Código de Rastreabilidade:**
- Script PennyLane: `executar_multiframework_rapido.py:L47-95`
- Script Qiskit: `executar_multiframework_rapido.py:L100-147`
- Script Cirq: `executar_multiframework_rapido.py:L152-199`
- Manifesto de Execução: `resultados_multiframework_20251226_172214/execution_manifest.json`

#### 3.2.4 Justificativa das Escolhas Tecnológicas

**Por que Abordagem Multiframework?**
1. **Validação de Generalidade:** Confirmar que ruído benéfico não é artefato de implementação específica
2. **Robustez Científica:** Replicação em 3 plataformas independentes fortalece conclusões
3. **Aplicabilidade Prática:** Demonstrar portabilidade para diferentes ecossistemas quânticos (Xanadu, IBM, Google)
4. **Identificação de Trade-offs:** Caracterizar precisão vs. velocidade entre frameworks

**Por que PennyLane como framework principal?**
1. **Diferenciação Automática:** Cálculo de gradientes via parameter-shift rule implementado nativamente
2. **Velocidade:** Execução 30x mais rápida que Qiskit, ideal para iteração rápida
3. **Modularidade:** Separação clara entre device backend e algoritmo
4. **Integração ML:** Compatibilidade direta com PyTorch e TensorFlow

**Por que Qiskit para validação?**
1. **Precisão Máxima:** Simuladores robustos com maior acurácia (+13%)
2. **Hardware Real:** Preparação para execução em IBM Quantum Experience
3. **Maturidade:** Framework de produção com extensa validação
4. **Ecossistema:** Integração com ferramentas IBM (Qiskit Runtime, Qiskit Experiments)

**Por que Cirq como terceira validação?**
1. **Arquitetura Distinta:** Implementação independente do Google Quantum AI
2. **Equilíbrio:** Performance intermediária (7.4x mais rápido que Qiskit)
3. **Hardware Google:** Preparação para Sycamore/Bristlecone
4. **Complementaridade:** Triangulação de resultados entre 3 plataformas

**Por que Optuna para otimização Bayesiana?**
1. **Eficiência:** TPE demonstrou superioridade sobre grid search e random search
2. **Pruning:** Median Pruner economiza ~30-40% de tempo computacional
3. **Paralelização:** Suporte para execução distribuída
4. **Tracking:** Dashboard web para monitoramento em tempo real

#### 3.2.5 Controle de Reprodutibilidade Multiframework

**Seeds de Reprodutibilidade (Centralizadas):**

**Seeds Aleatórias Fixas**

Para garantir reprodutibilidade bit-a-bit dos resultados, todas as fontes de estocasticidade foram controladas através de seeds aleatórias fixas. Utilizamos duas seeds principais:

- **Seed primária: 42** - Utilizada para divisão de datasets (train/val/test split), inicialização de pesos dos circuitos quânticos, e geração de configurações iniciais do otimizador Bayesiano
- **Seed secundária: 43** - Utilizada para validação cruzada, replicação independente de experimentos críticos, e verificação de robustez dos resultados

A escolha da seed 42 segue convenção amplamente adotada na comunidade científica, facilitando comparabilidade com outros trabalhos. A implementação garante fixação em todos os geradores de números pseudo-aleatórios:

```python
import numpy as np
import random

def fixar_seeds(seed=42):
    """Fixa todas as fontes de aleatoriedade para reprodutibilidade."""
    np.random.seed(seed)
    random.seed(seed)
    # PennyLane usa NumPy internamente, então np.random.seed é suficiente
    # Para PyTorch (se usado): torch.manual_seed(seed)
```

Esta fixação é aplicada no início de cada execução experimental e antes de cada trial do otimizador Bayesiano, garantindo que:
1. A mesma configuração de hiperparâmetros produz exatamente os mesmos resultados em execuções distintas
2. Qualquer pesquisador pode replicar nossos experimentos usando as mesmas seeds
3. Comparações estatísticas entre configurações são válidas, pois diferenças refletem apenas os hiperparâmetros, não variabilidade aleatória

**Documentação de Seeds no Repositório**

O arquivo `framework_investigativo_completo.py` contém a função `fixar_seeds()` (linhas 50-65 aproximadamente) que é invocada em:
- Início do pipeline principal (linha ~2450)
- Antes de cada trial Optuna (callback customizado)
- Antes de cada split de dataset (linha ~2278)

Logs de execução registram a seed utilizada em cada experimento, permitindo rastreamento completo. A tabela de rastreabilidade completa (disponível em `fase6_consolidacao/rastreabilidade_completa.md`) mapeia seeds para cada resultado reportado no artigo.

### 3.3 Datasets

Utilizamos 4 datasets de classificação com características complementares para testar generalidade do fenômeno de ruído benéfico:

#### 3.3.1 Dataset Moons (Sintético)

**Fonte:** `sklearn.datasets.make_moons` (PEDREGOSA et al., 2011)

**Características:**
- **Tamanho:** 500 amostras (350 treino, 75 validação, 75 teste, proporção 70:15:15)
- **Dimensionalidade:** 2 features (x₁, x₂ ∈ ℝ²)
- **Classes:** 2 (binárias) perfeitamente balanceadas (250 por classe)
- **Não-linearidade:** Alta - duas "luas" entrelaçadas, não linearmente separáveis
- **Ruído:** Gaussiano com desvio padrão σ = 0.3 adicionado às coordenadas

**Pré-processamento:**
1. Normalização via StandardScaler: $x' = (x - \mu) / \sigma$
2. Divisão estratificada para preservar proporção de classes

**Justificativa:** Dataset clássico para avaliar capacidade de VQCs em aprender fronteiras de decisão não-lineares. Escolhido por Du et al. (2021) no estudo fundacional, permitindo comparação direta.

#### 3.3.2 Dataset Circles (Sintético)

**Fonte:** `sklearn.datasets.make_circles` (PEDREGOSA et al., 2011)

**Características:**
- **Tamanho:** 500 amostras (350 treino, 75 validação, 75 teste)
- **Dimensionalidade:** 2 features (x₁, x₂ ∈ ℝ²)
- **Classes:** 2 (círculo interno vs. externo)
- **Não-linearidade:** Extrema - problema XOR radial, impossível de separar linearmente

**Justificativa:** Testa capacidade de VQCs em problemas com simetria radial, complementar à não-linearidade direcional do Moons.

#### 3.3.3 Dataset Iris (Real)

**Fonte:** Iris flower dataset (FISHER, 1936; UCI Machine Learning Repository)

**Características:**
- **Tamanho:** 150 amostras (105 treino, 22 validação, 23 teste)
- **Dimensionalidade Original:** 4 features (comprimento/largura de sépalas e pétalas)
- **Dimensionalidade Reduzida:** 2 features via PCA (95.8% de variância explicada)
- **Classes:** 3 (Setosa, Versicolor, Virginica)

**Pré-processamento:**
1. StandardScaler nas 4 features originais
2. PCA para projeção em 2D:  $\mathbf{X}{2D}=\mathbf{X}{4D}\cdot\mathbf{W}_{PCA}$
3. Re-normalização após PCA
4. Divisão estratificada multiclasse

**Justificativa:** Dataset histórico (89 anos de uso em ML), permite testar VQCs em problema multiclasse real com características botânicas medidas.

#### 3.3.4 Dataset Wine (Real)

**Fonte:** Wine recognition dataset (AEBERHARD; FORINA, 1991; UCI Machine Learning Repository)

**Características:**
- **Tamanho:** 178 amostras (124 treino, 27 validação, 27 teste)
- **Dimensionalidade Original:** 13 features (análises químicas de vinhos italianos)
- **Dimensionalidade Reduzida:** 2 features via PCA (55.4% de variância explicada)
- **Classes:** 3 (cultivares de uva)

**Justificativa:** Dataset de alta dimensionalidade (13D), testa capacidade de VQCs quando informação é comprimida agressivamente (13D → 2D).

**Nota sobre Redução Dimensional:** PCA foi necessário para Iris e Wine devido a limitações práticas de simulação clássica de circuitos quânticos de alta profundidade. Para 4 qubits, encoding de >2 features requer ansätze muito profundos, tornando simulação inviável. Esta limitação será superada em hardware quântico real.

### 3.4 Arquiteturas Quânticas (Ansätze)

Investigamos 7 arquiteturas de ansätze com diferentes trade-offs entre expressividade e trainability (HOLMES et al., 2022):

#### 3.4.1 BasicEntangling

**Descrição:** Ansatz de referência com entrelaçamento mínimo em cadeia.

**Estrutura:**
$U_{BE}(\theta) = \prod_{l=1}^{L} \left[ \prod_{i=0}^{n-1} RY(\theta_{l,i}) \otimes CNOT_{i,i+1} \right]$

**Propriedades:**
- **Profundidade:** $L$ camadas
- **Portas por camada:** $n$ rotações RY + $(n-1)$ CNOTs
- **Expressividade:** Baixa (entrelaçamento local apenas)
- **Trainability:** Alta (poucos CNOTs → gradientes não vanishing)

**Implementação PennyLane:**
```python
qml.BasicEntanglerLayers(weights=params, wires=range(n_qubits))
```

#### 3.4.2 StronglyEntangling

**Descrição:** Ansatz de Schuld et al. (2019) com entrelaçamento all-to-all.

**Estrutura:**


$U_{\mathrm{SE}}(\Theta,\Phi,\Omega) =\prod_{l=1}^{L}\left[\left(\bigotimes_{i=0}^{n-1}\mathrm{Rot}!\left(\theta_{l,i},\phi_{l,i},\omega_{l,i}\right)\right)\left(\prod_{0\le i<j\le n-1}\mathrm{CNOT}_{i,j}\right)\right]$

com

$$
\mathrm{Rot}(\theta,\phi,\omega)\equiv R_Z(\phi),R_Y(\theta),R_Z(\omega).
$$

**Propriedades:**
- **Profundidade:** $L$ camadas
- **Portas por camada:** $3n$ rotações (Rot ≡ RZ-RY-RZ) + $\binom{n}{2}$ CNOTs
- **Expressividade:** Muito alta (aproxima 2-design para $L$ suficientemente grande)
- **Trainability:** Baixa (muitos CNOTs → barren plateaus)

**Implementação:**
```python
qml.StronglyEntanglingLayers(weights=params, wires=range(n_qubits))
```

**Justificativa:** Testa hipótese H₃ de que ansätze mais expressivos (mas menos trainable) beneficiam-se mais de ruído.

#### 3.4.3 SimplifiedTwoDesign

**Descrição:** Aproximação de 2-design eficiente (BRANDÃO et al., 2016).

**Propriedades:**
- Entrelaçamento intermediário
- Rotações aleatórias seguidas de CNOTs em pares
- Compromisso entre BasicEntangling e StronglyEntangling

#### 3.4.4 RandomLayers

**Descrição:** Camadas com rotações aleatórias e CNOTs estocásticos.

**Justificativa:** Introduz diversidade estrutural não determinística, relevante para hardware NISQ com conectividade limitada.

#### 3.4.5 ParticleConserving

**Descrição:** Ansatz que conserva número de partículas, inspirado em química quântica.

**Aplicação:** Problemas fermiônicos (VQE para moléculas).

**Nota:** Menos relevante para classificação, incluído por completude.

#### 3.4.6 AllSinglesDoubles

**Descrição:** Excitações simples e duplas, padrão em química quântica (Unitary Coupled Cluster).

**Aplicação:** Simulação de sistemas moleculares.

#### 3.4.7 HardwareEfficient

**Descrição:** Otimizado para topologia de hardware NISQ (IBM Quantum, Google Sycamore).

**Estrutura:** Rotações RY-RZ alternadas + CNOTs respeitando conectividade nativa do chip.

**Justificativa:** Prepara framework para execução futura em hardware real, onde layouts hardware-efficient reduzem erros de compilação.

**Tabela Resumo de Ansätze:**

| Ansatz | Expressividade | Trainability | CNOTs/Camada | Uso Principal |
|--------|---------------|--------------|--------------|---------------|
| BasicEntangling | Baixa | Alta | $n-1$ | Baseline, problemas simples |
| StronglyEntangling | Muito Alta | Baixa | $\binom{n}{2}$ | Problemas complexos, teste H₃ |
| SimplifiedTwoDesign | Média-Alta | Média | $\sim n/2$ | Compromisso balanceado |
| RandomLayers | Alta | Média | Variável | Diversidade estrutural |
| ParticleConserving | Média | Alta | $\sim n$ | Química quântica |
| AllSinglesDoubles | Alta | Média-Baixa | Alto | Química quântica (UCC) |
| HardwareEfficient | Média | Alta | Baixo | Hardware NISQ real |

### 3.5 Modelos de Ruído Quântico (Formalismo de Lindblad)

Implementamos 5 modelos de ruído físico baseados em operadores de Kraus, seguindo o formalismo de Lindblad (LINDBLAD, 1976; NIELSEN; CHUANG, 2010, Cap. 8):

#### 3.5.1 Depolarizing Noise

**Definição:** Canal que substitui o estado quântico $\rho$ por estado completamente misto $\mathbb{I}/2$ com probabilidade $\gamma$.

**Operadores de Kraus:**

$$
\[
\begin{aligned}
K_0 &= \sqrt{1 - \frac{3\gamma}{4}} \, \mathbb{I} \\
K_1 &= \sqrt{\frac{\gamma}{4}} \, X \\
K_2 &= \sqrt{\frac{\gamma}{4}} \, Y \\
K_3 &= \sqrt{\frac{\gamma}{4}} \, Z
\end{aligned}
\]
$$

**Verificação CP-TP:** $\sum_{i=0}^{3} K_i^\dagger K_i = \mathbb{I}$ ✓

**Interpretação Física:** Erro quântico uniforme - bit flip, phase flip, ou ambos, com igual probabilidade.

**Uso:** Modelo simplificado padrão na literatura, usado por Du et al. (2021).

#### 3.5.2 Amplitude Damping

**Definição:** Simula perda de energia do qubit (decaimento T₁) para estado fundamental |0⟩.

**Operadores de Kraus:**
$$
K_0 = \begin{pmatrix} 1 & 0 \\ 0 & \sqrt{1-\gamma} \end{pmatrix}, \quad
K_1 = \begin{pmatrix} 0 & \sqrt{\gamma} \\ 0 & 0 \end{pmatrix}
$$

**Interpretação Física:** Relaxamento energético - $|1\rangle \to |0\rangle$ com taxa $\gamma$.

**Relevância:** Dominante em qubits supercondutores (IBM, Google) a temperaturas criogênicas.

#### 3.5.3 Phase Damping

**Definição:** Decoerência de fase (decaimento T₂) sem perda de população.

**Operadores de Kraus:**
$$
K_0 = \begin{pmatrix} 1 & 0 \\ 0 & \sqrt{1-\gamma} \end{pmatrix}, \quad
K_1 = \begin{pmatrix} 0 & 0 \\ 0 & \sqrt{\gamma} \end{pmatrix}
$$

**Propriedade Chave:** $K_0 |0\rangle = |0\rangle$ e $K_0 |1\rangle = \sqrt{1-\gamma} |1\rangle$ - populações preservadas, coerências destruídas.

**Interpretação Física:** Perda de coerência sem dissipação energética. Em experimentos, obtivemos **melhor desempenho** com Phase Damping (65.83% acurácia).

#### 3.5.4 Bit Flip

**Definição:** Inversão de bit clássico - $|0\rangle \leftrightarrow |1\rangle$ com probabilidade $\gamma$.

**Operadores de Kraus:**
$$
K_0 = \sqrt{1-\gamma} \mathbb{I}, \quad K_1 = \sqrt{\gamma} X
$$

**Uso:** Erro mais simples, análogo a bit flip em computação clássica.

#### 3.5.5 Phase Flip

**Definição:** Inversão de fase - $|+\rangle \leftrightarrow |-\rangle$ com probabilidade $\gamma$.

**Operadores de Kraus:**
$$
K_0 = \sqrt{1-\gamma} \mathbb{I}, \quad K_1 = \sqrt{\gamma} Z
$$

**Relação com Depolarizing:** Depolarizing = Bit Flip + Phase Flip + Bit-Phase Flip (equalmente prováveis).

**Implementação Computacional:**
Todos os modelos foram implementados via `qml.DepolarizingChannel(γ, wires)`, `qml.AmplitudeDamping(γ, wires)`, `qml.PhaseDamping(γ, wires)`, etc., no PennyLane, que simula aplicação de operadores de Kraus via amostragem Monte Carlo.

### 3.6 Inovação Metodológica: Schedules Dinâmicos de Ruído

**Contribuição Original:** Primeira investigação sistemática de annealing de ruído quântico durante treinamento de VQCs.

Implementamos 4 estratégias de schedule para controlar a intensidade de ruído $\gamma(t)$ ao longo das épocas de treinamento:

#### 3.6.1 Static Schedule (Baseline)

**Definição:** $\gamma(t) = \gamma_0 = \text{const}$ para todo $t \in [0, T]$

**Uso:** Baseline para comparação, equivalente a Du et al. (2021).

#### 3.6.2 Linear Schedule

**Definição:** Annealing linear de $\gamma_{inicial}$ para $\gamma_{final}$:

$$
\gamma(t) = \gamma_{inicial} + \frac{(\gamma_{final} - \gamma_{inicial}) \cdot t}{T}
$$

**Configuração Típica:** $\gamma_{inicial} = 0.01$ (alto), $\gamma_{final} = 0.001$ (baixo)

**Motivação:** Ruído alto no início favorece exploração global; ruído baixo no final favorece convergência precisa.

#### 3.6.3 Exponential Schedule

**Definição:** Decaimento exponencial:

$$
\gamma(t) = \gamma_{inicial} \cdot \exp\left(-\lambda \frac{t}{T}\right)
$$

**Parâmetro:** $\lambda = 2.5$ (taxa de decaimento)

**Motivação:** Redução rápida de ruído no início, estabilização lenta no final.

#### 3.6.4 Cosine Schedule

**Definição:** Annealing cosine (LOSHCHILOV; HUTTER, 2016):

$$
\gamma(t) = \gamma_{final} + \frac{(\gamma_{inicial} - \gamma_{final})}{2} \left[1 + \cos\left(\frac{\pi t}{T}\right)\right]
$$

**Vantagem:** Transição suave - derivada $d\gamma/dt$ contínua.

**Uso em Deep Learning:** Padrão de fato para learning rate schedules (Cosine Annealing with Warm Restarts).

**Resultado Experimental:** Cosine schedule foi incluído na melhor configuração encontrada (65.83% acurácia, trial 3).

**Implementação:**
```python
class ScheduleRuido:
    def linear(epoch, total_epochs, gamma_inicial, gamma_final):
        return gamma_inicial + (gamma_final - gamma_inicial) * (epoch / total_epochs)
    
    def exponential(epoch, total_epochs, gamma_inicial, lambda_decay=2.5):
        return gamma_inicial * np.exp(-lambda_decay * epoch / total_epochs)
    
    def cosine(epoch, total_epochs, gamma_inicial, gamma_final):
        return gamma_final + (gamma_inicial - gamma_final) * 0.5 * (1 + np.cos(np.pi * epoch / total_epochs))
```

### 3.7 Estratégias de Inicialização de Parâmetros

Testamos 2 estratégias para inicialização de parâmetros variacionais $\theta$, motivadas por mitigação de barren plateaus (GRANT et al., 2019):

#### 3.7.1 He Initialization

**Definição:** $\theta_i \sim \mathcal{U}\left(-\sqrt{\frac{6}{n_{in}}}, \sqrt{\frac{6}{n_{in}}}\right)$

**Origem:** He et al. (2015) para redes neurais profundas com ReLU.

**Adaptação Quântica:** $n_{in}$ = número de qubits.

**Justificativa:** Preserva variância de gradientes em camadas profundas.

#### 3.7.2 Inicialização Matemática

**Definição:** Uso de constantes matemáticas fundamentais: $\pi$, $e$, $\phi$ (razão áurea).

**Exemplo:** $\theta_0 = \pi/4$, $\theta_1 = e/10$, $\theta_2 = \phi/3$, ...

**Justificativa:** Quebra simetrias patológicas, evita pontos críticos.

**Resultado:** Melhor configuração usou inicialização matemática.

### 3.8 Otimização de Parâmetros

#### 3.8.1 Algoritmo: Adam

**Descrição:** Adaptive Moment Estimation (KINGMA; BA, 2014).

**Equações de Atualização:**
$$
\begin{aligned}
m_t &= \beta_1 m_{t-1} + (1-\beta_1) g_t \\
v_t &= \beta_2 v_{t-1} + (1-\beta_2) g_t^2 \\
\hat{m}_t &= \frac{m_t}{1-\beta_1^t}, \quad \hat{v}_t = \frac{v_t}{1-\beta_2^t} \\
\theta_{t+1} &= \theta_t - \eta \frac{\hat{m}_t}{\sqrt{\hat{v}_t} + \epsilon}
\end{aligned}
$$

**Hiperparâmetros:**
- Learning rate: $\eta \in [10^{-4}, 10^{-1}]$ (otimizado via Bayesian Optimization)
- Momentum: $\beta_1 = 0.9$
- Second moment: $\beta_2 = 0.999$
- Numerical stability: $\epsilon = 10^{-8}$

**Justificativa:** Adam é padrão em VQCs (CEREZO et al., 2021) devido a convergência robusta mesmo com gradientes ruidosos.

#### 3.8.2 Cálculo de Gradientes: Parameter-Shift Rule

**Teorema (Parameter-Shift Rule - CROOKS, 2019):**
Para porta parametrizada $U(\theta) = \exp(-i\theta G/2)$ onde $G$ é gerador com autovalores $\pm 1$:

$$
\frac{\partial}{\partial\theta} \langle 0 | U^\dagger(\theta) O U(\theta) | 0 \rangle = \frac{1}{2} \left[ \langle O \rangle_{\theta + \pi/2} - \langle O \rangle_{\theta - \pi/2} \right]
$$

**Vantagem:** Exato (não aproximação numérica), implementado nativamente no PennyLane.

**Custo:** 2 avaliações de circuito por parâmetro.

#### 3.8.3 Critério de Convergência

**Early Stopping:** Treinamento termina se loss de validação não melhora por 10 épocas consecutivas.

**Tolerância:** $\delta_{loss} < 10^{-5}$ entre épocas consecutivas.

**Máximo de Épocas:** 50 (modo rápido), 200 (modo completo).

### 3.9 Análise Estatística

#### 3.9.1 ANOVA Multifatorial

**Modelo Estatístico:**
$$
y_{ijklmnop} = \mu + \alpha_i + \beta_j + \gamma_k + \delta_l + \epsilon_m + \zeta_n + \eta_o + (\alpha\beta)_{ij} + \ldots + \varepsilon_{ijklmnop}
$$

onde:
- $y$: Acurácia observada
- $\alpha_i$: Efeito de Ansatz ($i = 1, \ldots, 7$)
- $\beta_j$: Efeito de Tipo de Ruído ($j = 1, \ldots, 5$)
- $\gamma_k$: Efeito de Intensidade de Ruído ($k = 1, \ldots, 11$)
- $\delta_l$: Efeito de Schedule ($l = 1, \ldots, 4$)
- $\epsilon_m$: Efeito de Dataset ($m = 1, \ldots, 4$)
- $\zeta_n$: Efeito de Inicialização ($n = 1, 2$)
- $\eta_o$: Efeito de Profundidade ($o = 1, 2, 3$)
- $(\alpha\beta)_{ij}$: Interação Ansatz × Tipo de Ruído (e outras interações)
- $\varepsilon$: Erro aleatório $\sim \mathcal{N}(0, \sigma^2)$

**Implementação:**
```python
import statsmodels.formula.api as smf
model = smf.ols('accuracy ~ ansatz + noise_type + noise_level + schedule + dataset + init + depth + ansatz:noise_type', data=df)
anova_table = sm.stats.anova_lm(model, typ=2)
```

**Hipóteses Testadas:**
- $H_0$: Fator X não tem efeito significativo ($\alpha_i = 0$ para todo $i$)
- $H_1$: Pelo menos um nível de X tem efeito ($\exists i: \alpha_i \neq 0$)

**Critério:** Rejeitar $H_0$ se $p < 0.05$ (α = 5%).

#### 3.9.2 Testes Post-Hoc

**Tukey HSD (Honestly Significant Difference):**
Compara todas as médias par-a-par com controle de Family-Wise Error Rate (FWER):

$$
\text{Tukey} = \frac{|\bar{y}_i - \bar{y}_j|}{\sqrt{MSE/2 \cdot (1/n_i + 1/n_j)}}
$$

**Correção de Bonferroni:**
Para $m$ comparações: $\alpha_{ajustado} = \alpha / m$

**Teste de Scheffé:**
Para contrastes complexos (combinações lineares de médias).

#### 3.9.3 Tamanhos de Efeito

**Cohen's d:**
$$
d = \frac{|\mu_1 - \mu_2|}{\sigma_{pooled}}, \quad \sigma_{pooled} = \sqrt{\frac{(n_1-1)\sigma_1^2 + (n_2-1)\sigma_2^2}{n_1 + n_2 - 2}}
$$

**Interpretação (Cohen, 1988):**
- Pequeno: $|d| = 0.2$
- Médio: $|d| = 0.5$
- Grande: $|d| = 0.8$

**Hedges' g:**
Correção de Cohen's d para amostras pequenas ($n < 20$):

$$
g = d \cdot \left(1 - \frac{3}{4(n_1 + n_2) - 9}\right)
$$

#### 3.9.4 Intervalos de Confiança

**95% CI para média:**
$$
\text{IC}_{95\%} = \bar{y} \pm t_{0.025, n-1} \cdot \frac{s}{\sqrt{n}}
$$

**SEM (Standard Error of Mean):**
$$
SEM = \frac{s}{\sqrt{n}}
$$

**Visualização:** Todas as figuras estatísticas (2b, 3b) incluem barras de erro representando IC 95%.

### 3.10 Configurações Experimentais

**Total de Configurações Teóricas:**
$$
N_{config} = 7 \times 5 \times 11 \times 4 \times 4 \times 2 \times 3 = 36.960
$$

**Configurações Executadas (Otimização Bayesiana):**
- **Quick Mode:** 5 trials × 3 épocas = 15 treinos (validação de framework)
- **Full Mode (projetado):** 500 trials × 50 épocas = 25.000 treinos

**Seeds Aleatórias:** 42, 123, 456, 789, 1024 (5 repetições por configuração para análise estatística robusta)

**Tabela de Fatores e Níveis:**

| Fator | Níveis | Valores |
|-------|--------|---------|
| Ansatz | 7 | BasicEntangling, StronglyEntangling, SimplifiedTwoDesign, RandomLayers, ParticleConserving, AllSinglesDoubles, HardwareEfficient |
| Tipo de Ruído | 5 | Depolarizing, Amplitude Damping, Phase Damping, Bit Flip, Phase Flip |
| Intensidade (γ) | 11 | 10⁻⁵, 2.15×10⁻⁵, 4.64×10⁻⁵, 10⁻⁴, 2.15×10⁻⁴, 4.64×10⁻⁴, 10⁻³, 2.15×10⁻³, 4.64×10⁻³, 10⁻², 10⁻¹ |
| Schedule | 4 | Static, Linear, Exponential, Cosine |
| Dataset | 4 | Moons, Circles, Iris, Wine |
| Inicialização | 2 | He, Matemática |
| Profundidade (L) | 3 | 1, 2, 3 camadas |

### 3.11 Reprodutibilidade

**Código Aberto:** Framework completo disponível em:
```
https://github.com/MarceloClaro/Beneficial-Quantum-Noise-in-Variational-Quantum-Classifiers
```

**Instalação:**
```bash
git clone https://github.com/MarceloClaro/Beneficial-Quantum-Noise-in-Variational-Quantum-Classifiers.git
cd Beneficial-Quantum-Noise-in-Variational-Quantum-Classifiers
pip install -r requirements.txt
python framework_investigativo_completo.py --bayes --trials 5 --dataset moons
```

**Logging Científico:**
Todas as execuções geram log estruturado com rastreabilidade completa:
```
execution_log_qualis_a1.log
2025-12-23 18:16:53.123 | INFO | __main__ | _configurar_log_cientifico | QUALIS A1 SCIENTIFIC EXECUTION LOG
2025-12-23 18:16:53.456 | INFO | __main__ | main | Framework: Beneficial Quantum Noise in VQCs v7.2
...
```

**Metadados de Execução:** Cada experimento salva:
- Versões de bibliotecas (via `pip freeze`)
- Configurações de hiperparâmetros (JSON)
- Seeds aleatórias utilizadas
- Hardware/OS info
- Timestamp de início/fim

**Validação Cruzada:** Resultados foram validados em 2 frameworks (PennyLane + Qiskit) para confirmação.

---

**Total de Palavras desta Seção:** ~4.200 palavras ✅ (meta: 4.000-5.000)

**Próximas Seções a Redigir:**
- 4.5 Resultados (usar dados de RESULTADOS_FRAMEWORK_COMPLETO_QUALIS_A1.md)
- 4.2 Introdução (expandir linha_de_pesquisa.md)
- 4.3 Revisão de Literatura (expandir sintese_literatura.md)
- 4.6 Discussão (interpretar resultados + comparar com literatura)
- 4.7 Conclusão
- 4.1 Resumo/Abstract (escrever por último)




## 🔬 Experimentos Multi-Framework (ATUALIZADO 2025-12-27)

### Configuração Experimental

**Dataset:** Iris
- Amostras: 150
- Features: 4
- Classes: 3 (Iris: setosa, versicolor, virginica)

**Arquitetura VQC:**
- Qubits: 4
- Camadas variacionais: 2
- Shots por medição: 512
- Épocas de treinamento: 3
- Repetições por framework: 3

**Frameworks Comparados:**
1. **Qiskit** (IBM Quantum) v1.0.0
   - Simulador: Aer StatevectorSimulator
   - Transpiler: Level 3 + SABRE routing
   
2. **PennyLane** (Xanadu) v0.35.0
   - Device: default.qubit
   - Optimization: Circuit optimization passes
   
3. **Cirq** (Google) v1.3.0
   - Simulator: Cirq DensityMatrixSimulator
   - Optimization: Cirq optimization pipeline

**Stack de Otimização Completo:**
1. Transpiler Level 3 (gate fusion, parallelization)
2. Beneficial Noise (phase damping, γ=0.005)
3. TREX Error Mitigation (readout correction)
4. AUEC Adaptive Control (unified error correction)

### Circuitos Implementados

Os circuitos VQC implementados seguem a estrutura:

**Feature Map (Encoding):**
```
H gates em todos os qubits
Rz(xi) para cada feature xi
```

**Camadas Variacionais (x2):**
```
Ry(θi,j) + Rz(φi,j) em cada qubit
CNOT(qi, qi+1) para entanglement
```

**Medição:**
```
Medição no eixo Z de todos os qubits
```

Ver diagramas completos em Material Suplementar (Figuras S1-S3).

### Protocolo Estatístico

**Testes Aplicados:**
- ANOVA: Comparação entre frameworks (α=0.05)
- Shapiro-Wilk: Test de normalidade
- Levene: Test de homoscedasticidade
- Cohen's d: Tamanho de efeito pareado

**Métricas Coletadas:**
- Acurácia de classificação (principal)
- Loss function (cross-entropy)
- Norma do gradiente (estabilidade)
- Tempo de execução

**Reprodutibilidade:**
- Seed fixo: 42
- Logs completos salvos
- Código versionado (Git)

