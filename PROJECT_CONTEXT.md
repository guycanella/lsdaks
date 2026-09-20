# PROJECT_CONTEXT.md

## 📚 Visão Geral

**LSDA-Hubbard-Fortran** é uma reimplementação moderna em Fortran do código LSDA (Local Spin Density Approximation) para cálculos de Bethe Ansatz-LSDA no modelo de Hubbard 1D. Este projeto migra um código legado em C++ para Fortran moderno (2008/2018), com foco em:

- **Arquitetura limpa e modular**
- **Testes unitários abrangentes**
- **Performance otimizada** (LAPACK; as únicas diretivas `!$OMP` do projeto estão em
  `src/bethe_ansatz/bethe_tables.f90:575-598` — `app/generate_table.f90` não tem nenhuma —
  e só têm efeito se o usuário passar `--flag "-fopenmp" --link-flag "-fopenmp"` à mão,
  pois o `fpm.toml` não habilita OpenMP)
- **Código bem documentado e mantível**

---

## 🎯 Motivação

### Por que Fortran?

1. **Adequação natural para física computacional**
   - Arrays multidimensionais nativos
   - Álgebra linear de alto desempenho (LAPACK/BLAS)
   - Tipos numéricos precisos e bem definidos

2. **Modernidade** (Fortran 2008/2018)
   - Módulos e namespaces
   - Tipos derivados (similar a structs/classes)
   - Alocação automática
   - Interoperabilidade com C

3. **Eliminação de problemas do código original**
   - Arrays 1-indexed manualmente (offset `+1`)
   - Gerenciamento manual de memória (`new[]`/`delete[]`)
   - Arquitetura monolítica
   - Falta de testes
   - Bethe Ansatz não implementado (apenas leitura de tabelas)

---

## 🏗️ Arquitetura do Projeto

### Estrutura de Diretórios

```
lsdaks/
├── fpm.toml                    # Configuração do Fortran Package Manager
├── README.md                   # Documentação de uso
├── PROJECT_CONTEXT.md          # Este arquivo (contexto técnico)
├── NEXT_STEPS_REPORT.md        # Roadmap de correções (T1..T25) — local, não versionado
├── PROGRESS.md                 # Diário de progresso — local, não versionado
├── ford.md                     # Configuração da documentação FORD
├── input.txt                   # Input de exemplo na raiz
│
├── scripts/                    # Scripts utilitários rastreados
│   └── build_cpp_reference.sh  # Compila a referência C++ local em build/cpp/
│
├── src/                        # Código-fonte principal (29 arquivos .f90)
│   ├── types/
│   │   ├── lsda_types.f90     # Tipos principais (system_params_t, scf_params_t, ...)
│   │   ├── lsda_constants.f90 # Constantes físicas e numéricas
│   │   └── lsda_errors.f90    # Sistema de erros centralizado
│   │
│   ├── io/
│   │   ├── input_parser.f90   # Parse namelist (&system, &potential, &scf)
│   │   └── output_writer.f90  # Escrita de resultados (densidades, energia, eigenvalues)
│   │
│   ├── bethe_ansatz/
│   │   ├── bethe_equations.f90      # Equações de Lieb-Wu
│   │   ├── nonlinear_solvers.f90    # Newton-Raphson com Jacobiano analítico
│   │   ├── continuation.f90         # Sweep em U
│   │   ├── lieb_wu_integral.f90     # Equações integrais no limite termodinâmico
│   │   ├── table_io.f90             # I/O tabelas (ASCII/binário)
│   │   └── bethe_tables.f90         # Geração de tabelas XC
│   │
│   ├── xc_functional/
│   │   ├── spline2d.f90       # Interpolação bicúbica 2D (cúbica em m e em n; T8)
│   │   └── xc_lsda.f90        # Interface exc, Vxc_up, Vxc_dw
│   │
│   ├── potentials/
│   │   ├── potential_uniform.f90       # Potencial uniforme V(i) = V₀
│   │   ├── potential_harmonic.f90      # Armadilha harmônica
│   │   ├── potential_impurity.f90      # Impurezas (single/multiple/random)
│   │   ├── potential_random.f90        # Desordem (uniform/Gaussian)
│   │   ├── potential_barrier.f90       # Barreiras (single/double)
│   │   ├── potential_quasiperiodic.f90 # Aubry-André-Harper (AAH)
│   │   ├── potential_seed.f90          # Semente determinística da desordem
│   │   └── potential_factory.f90       # Factory; 10 identificadores em suas interfaces
│   │
│   ├── hamiltonian/
│   │   ├── hamiltonian_builder.f90 # Tight-binding com Veff
│   │   └── boundary_conditions.f90 # Open, periodic, twisted
│   │
│   ├── diagonalization/
│   │   └── lapack_wrapper.f90      # MRRR parcial: DSTEVR (OBC), ZHEEVR (demais BCs);
│   │                               # DSYEVR só nos caminhos de teste/legado
│   │
│   ├── density/
│   │   └── density_calculator.f90  # Densidade de autoestados KS (ocupação C¹)
│   │
│   ├── convergence/
│   │   ├── convergence_monitor.f90 # Monitoramento de convergência SCF
│   │   ├── mixing_schemes.f90      # Mistura linear de potencial
│   │   └── adaptive_mixing.f90     # Controlador adaptativo de α (classe Convergencia do C++)
│   │
│   └── kohn_sham/
│       └── kohn_sham_cycle.f90 # Loop SCF completo (real & complex)
│
├── app/
│   ├── main.f90               # Ponto de entrada (namelist-based)
│   ├── convert_tables.f90     # Utilitário de conversão de tabelas
│   └── generate_table.f90     # Gerador de tabelas XC a partir do Bethe Ansatz
│
├── test/                       # 20 suítes Fortuno, 1455 chamadas `call check(`
│   ├── test_kohn_sham_cycle.f90       # 238 asserções
│   ├── test_output_writer.f90         # 133
│   ├── test_input_parser.f90          # 130
│   ├── test_density_calculator.f90    # 118
│   ├── test_xc_lsda.f90               # 116
│   ├── test_potentials.f90            # 112
│   ├── test_table_io.f90              #  95
│   ├── test_bethe_tables.f90          #  79
│   ├── test_adaptive_mixing.f90       #  58
│   ├── test_lieb_wu_integral.f90      #  53
│   ├── test_boundary_conditions.f90   #  48
│   ├── test_errors.f90                #  47
│   ├── test_hamiltonian_builder.f90   #  44
│   ├── test_lapack_wrapper.f90        #  42
│   ├── test_convergence_monitor.f90   #  41
│   ├── test_bethe_equations.f90       #  27
│   ├── test_continuation.f90          #  22
│   ├── test_nonlinear_solvers.f90     #  19
│   ├── test_spline2d.f90              #  17
│   └── test_mixing_schemes.f90        #  16
│
├── examples/                   # Inputs de exemplo (namelist, não fontes Fortran)
│   ├── input_minimal.txt
│   ├── input_harmonic_trap.txt
│   ├── input_barrier.txt
│   ├── input_halffilling.txt
│   ├── input_strong_coupling.txt
│   └── input_twisted_bc.txt
│
├── extras/dead_code/           # Código não compilado e não chamado por nada em src/
│   ├── degeneracy_handler.f90       # QR/Gram-Schmidt; substituído pela ocupação C¹ (T7)
│   └── test_degeneracy_handler.f90  # Testes do acima; fora de fpm.toml
│
├── original/                   # Implementação C++ de referência (somente leitura)
│
├── doc/                        # Documentação de API gerada por FORD (258 arquivos
│                               # versionados; saída de `ford ford.md`, não editar à mão)
│
└── data/
    └── tables/
        └── fortran_native/     # Tabelas XC com o termo de Hartree já subtraído
```

**Não existem no repositório** (aparecem em planos antigos, não em `src/`):
`logger.f90`, `run_simulation.f90`, `symmetry.f90`, `table_manager.f90`, `lsda_main.f90`,
`test_logger.f90`. Contagem de testes verificada com
`for f in test/*.f90; do grep -c 'call check(' "$f"; done` em 2026-09-20.

---

## ⚠️ ARQUITETURA DO CICLO SCF (CRÍTICO!)

### **MISTURA DE POTENCIAL vs MISTURA DE DENSIDADE**

Esta é a diferença **MAIS IMPORTANTE** entre o código Fortran e o C++ original. A escolha errada leva a **não-convergência** em sistemas difíceis!

#### **O QUE O CÓDIGO C++ FAZ (CORRETO):**

```cpp
// lsdaks.cc, linhas 633-640
// MISTURA O POTENCIAL, NÃO A DENSIDADE!
v_eff[0][j] = Conv.Mix*v_eff[0][j] + (1.0 - Conv.Mix)*(v_ext[0][j] + u*dens[1][j] + Vxc[0][j]);
v_eff[1][j] = Conv.Mix*v_eff[1][j] + (1.0 - Conv.Mix)*(v_ext[1][j] + u*dens[0][j] + Vxc[1][j]);

// ... construir Hamiltonian, diagonalizar, calcular novas densidades ...

// Linhas 695-696: COPIA DENSIDADE SEM MISTURA!
dens[0][i] = next_dens[0][i];  // ← SEM MISTURA!
dens[1][i] = next_dens[1][i];  // ← SEM MISTURA!
```

**Convenção C++:** `Mix` = peso do ANTIGO
`v_new = Mix*v_old + (1-Mix)*v_calc`

#### **O QUE O CÓDIGO FORTRAN FAZ (CORRETO):**

```fortran
! kohn_sham_cycle.f90, linhas 265-299
! Workflow SCF correto:

do iter = 1, max_iter
    ! 1. Calcular V_xc das densidades atuais n_in
    call get_vxc(xc_func, n_up_in(i), n_down_in(i), V_xc_up(i), V_xc_down(i))

    ! 2. Calcular potenciais efetivos
    V_eff_up_calc(i) = V_ext(i) + U*n_down_in(i) + V_xc_up(i)
    V_eff_down_calc(i) = V_ext(i) + U*n_up_in(i) + V_xc_down(i)

    ! 3. MISTURAR POTENCIAIS (não densidades!) ✅
    V_eff_up(i) = (1-α)*V_eff_up(i) + α*V_eff_up_calc(i)
    V_eff_down(i) = (1-α)*V_eff_down(i) + α*V_eff_down_calc(i)

    ! 4. Construir H com V_eff MISTURADO
    call build_hamiltonian(L, V_eff_up, V_zero, bc, phase, H_up)
    call build_hamiltonian(L, V_eff_down, V_zero, bc, phase, H_down)

    ! 5. Diagonalizar → novas densidades
    call diagonalize_symmetric_real(H_up, L, eigvals_up, eigvecs_up)
    call compute_density_spin(eigvecs_up, L, Nup, n_up_out)

    ! 6. COPIAR DENSIDADES DIRETAMENTE (SEM MISTURA!) ✅
    n_up_in = n_up_out    ! ← SEM MISTURA!
    n_down_in = n_down_out
end do
```

**Convenção Fortran:** `α` = peso do NOVO
`n_mixed = (1-α)*n_old + α*n_new`

**Equivalência:** `α_Fortran = 1 - Mix_Cpp`

#### **POR QUE ISSO É CRÍTICO?**

**Mistura de densidade (ERRADO ❌):**
- Leva a oscilações selvagens em sistemas com forte correlação
- Não converge para U atrativo (U < 0) com impurezas
- Exemplo real: U=-4, V0=-4, 50% impurities, L=100 → **NÃO CONVERGE**

**Mistura de potencial (CORRETO ✅):**
- Estabiliza o Hamiltoniano ANTES da diagonalização
- Permite convergência suave mesmo em casos difíceis
- Mesmo caso problemático → **CONVERGE em 198 iterações**

#### **TESTE DE VALIDAÇÃO:**

Caso difícil: U=-4 (atrativo), V0=-4, 50% impurezas aleatórias, L=100

**Antes (mixing de densidade):**
```
Iter 100  |Δn| = 3.3848      E_tot = -364.9371
Iter 200  |Δn| = 3.3651      E_tot = -364.8792
...oscilando indefinidamente...
```

**Depois (mixing de potencial):**
```
Iter 100  |Δn| = 1.4235E-03  E_tot = -364.84973183  α = 0.04844
Iter 198  |Δn| = 3.3878E-07  E_tot = -364.84972947  α = 0.05016
✓ CONVERGED!
```

#### **RESUMO DA ARQUITETURA:**

```
Fluxo SCF correto:
┌─────────────────────────────────────────────────────┐
│ 1. n_in → V_xc (do funcional XC)                    │
│ 2. V_eff_calc = V_ext + U*n_other + V_xc            │
│ 3. V_eff = Mix*V_eff_old + (1-Mix)*V_eff_calc  ✅  │  ← MISTURA AQUI!
│ 4. H(V_eff) → diagonalize → n_out                   │
│ 5. n_in = n_out  (cópia direta, SEM MISTURA!)  ✅  │
│ 6. Check convergence → repeat if needed             │
└─────────────────────────────────────────────────────┘
```

### **MISTURA ADAPTATIVA (Classe `Convergencia`)**

O código implementa a classe `Convergencia` do C++ original em `adaptive_mixing.f90`:

**Estratégia:**
- Rastreia energia em banda [E_bot, E_top]
- Se energia oscila na banda por `CountSCmax=10` iterações → `UpMix()` (mais conservativo)
- Se energia só aumenta/diminui por `CountSCmax*5` iterações E Mix > 0.35 → `DwMix()` (mais agressivo)
- Convergência: `CountSC ≥ 10` E `|ΔE| < tol` E `|E_top - E_bot| < tol`

**Fórmulas:**
```fortran
! UpMix: aumenta Mix (mais peso no antigo)
NewMix = Mix + (1.0 - Mix)/1.5
if (NewMix < 0.999999999) Mix = NewMix

! DwMix: diminui Mix (mais peso no novo)
Mix = Mix - (1.0 - Mix)*1.9  ! ← pode ficar negativo!

! Safety clamp
if (Mix < 0.0) Mix = 0.0
```

**Conversão para α (Fortran):**
```fortran
α = 1.0 - Mix
if (α <= 0.0) α = 1.0e-10  ! Evita α=0 (sem progresso)
if (α > 1.0) α = 1.0       ! Clamp superior
```

**Convergência dupla:**
- **Primária:** ||Δn||₂ < `density_tol` (padrão: 1e-6)
- **Fallback:** `mix_ctrl%converged` (energia estável)

Isso permite convergência mesmo quando densidade oscila levemente mas energia está estável!

---

## 🧮 Física do Problema

### Modelo de Hubbard 1D

Hamiltoniano:
$$
H = -t \sum_{i,j,\sigma} (c_{i\sigma}^\dagger c_{j\sigma} + \text{h.c.}) + U \sum_i n_{i\uparrow} n_{i\downarrow} + \sum_{i,\sigma} V_i^{\text{ext}} n_{i\sigma}
$$

- **t = 1**: Hopping (unidade de energia)
- **U**: Interação on-site (Hubbard U)
- **$V_i^{\text{ext}}$**: Potencial externo (armadilha, impurezas, etc)

### Teoria do Funcional da Densidade (DFT)

Kohn-Sham equations:
$$
\left[-\nabla^2 + V_{\text{ext}}(r) + V_H(r) + V_{\text{xc}}(r)\right] \psi_i(r) = \varepsilon_i \psi_i(r)
$$

Para o Hubbard 1D:
$$
H_{\text{KS}} = H_0 + V_{\text{ext}} + U \cdot n_{-\sigma} + V_{\text{xc}}
$$

### Bethe Ansatz de Lieb-Wu

Solução exata para o estado fundamental via Ansatz de Bethe.

**Equações para rapidities de carga** ($j = 1, 2, \ldots, N_{\uparrow}$):
$$
F_j^k = k_j - \frac{2\pi}{L} I_j - \frac{1}{L} \sum_{\alpha=1}^{M} \theta(k_j - \Lambda_\alpha, U) = 0
$$

**Equações para rapidities de spin** ($\alpha = 1, 2, \ldots, M$ onde $M = N_{\downarrow}$):
$$
F_\alpha^\Lambda = \frac{2\pi}{L} J_\alpha - \sum_{j=1}^{N_{\uparrow}} \theta(\Lambda_\alpha - k_j, U) + \sum_{\substack{\beta=1 \\ \beta \neq \alpha}}^{M} \Theta(\Lambda_\alpha - \Lambda_\beta, U) = 0
$$

Onde:
- $\theta(x, U) = 2\arctan(2x/U)$ (espalhamento carga-spin)
- $\Theta(x, U) = 2\arctan(x/U)$ (espalhamento spin-spin)
- $\{I_j\}$: números quânticos de carga (inteiros/semi-inteiros)
- $\{J_\alpha\}$: números quânticos de spin (inteiros/semi-inteiros)

**Energia:**
$$
E = -2 \sum_j \cos(k_j)
$$

**Funcional XC:**
$$
\begin{align}
E_{\text{xc}} &= E_{\text{BA}}[n_\uparrow, n_\downarrow] - E_0[n_\uparrow, n_\downarrow] \\
V_{\text{xc}}^\uparrow &= \frac{\partial E_{\text{xc}}}{\partial n_\uparrow} \\
V_{\text{xc}}^\downarrow &= \frac{\partial E_{\text{xc}}}{\partial n_\downarrow}
\end{align}
$$

---

## 🔧 Decisões Técnicas

### 1. Build System: Fortran Package Manager (fpm)

**Por quê?**
- Gerenciamento automático de dependências
- Build simplificado: `fpm build`, `fpm test`, `fpm run`
- Integração com Fortuno (testes)
- Padrão moderno da comunidade Fortran

**Configuração (`fpm.toml`):**
```toml
name = "lsda-hubbard"
version = "0.1.0"
license = "MIT"
author = "Guilherme Canella"
maintainer = "guycanella@gmail.com"

[build]
auto-executables = true
auto-tests = true
auto-examples = true

[dependencies]

[dev-dependencies]
fortuno-serial = { git = "https://github.com/fortuno-repos/fortuno.git" }

[library]
source-dir = "src"

[[executable]]
name = "lsda"
source-dir = "app"
main = "main.f90"
```

### 2. Diagonalização: LAPACK

**Rotinas usadas pelo ciclo SCF:**
- `DSTEVR`: caminho MRRR parcial para Hamiltonianos tridiagonais com condição de contorno aberta (OBC)
- `ZHEEVR`: caminho MRRR parcial para Hamiltonianos complexos hermitianos, usado em todas as demais condições de contorno (periódica e torcida)

`DSYEVR` existe no wrapper (`diagonalize_symmetric_real_partial`), mas não é chamado pelo ciclo SCF: só é exercido pelos caminhos de teste e pelas rotinas legadas de espectro completo.

**Por quê não Givens?**
- LAPACK é ~10-100x mais rápido
- Implementação otimizada (BLAS nível 3)
- Bem testada e mantida
- Padrão industrial

O SCF solicita apenas a janela de menores autovalores e autovetores necessária às ocupações; as rotinas acima recebem esse intervalo por índice.

### 3. Splines 2D: Implementação Própria

**Método:** Bicúbica separável (spline 1D em cada direção)

**Estratégia:**
1. Para $(n_{\uparrow}, n_{\downarrow})$ → calcular $(n=n_\uparrow+n_\downarrow, m=n_\uparrow-n_\downarrow)$
2. Para cada $n_i$ fixo: interpolação spline 1D em $m$
3. Com valores interpolados: segunda interpolação spline 1D em $n$

**Vantagens:**
- Código limpo e moderno (sem dependências pesadas)
- Facilmente testável
- Totalmente controlado
- $C^2$ contínuo

**Estrutura:**
```fortran
type :: spline2d_t
    real(real64), allocatable :: n_grid(:)      ! Grid de densidades
    real(real64), allocatable :: m_grid(:,:)    ! Grid de magnetizações
    real(real64), allocatable :: f(:,:)         ! Valores da função
    real(real64), allocatable :: d2f_dm2(:,:)   ! Derivadas segundas em m
    real(real64), allocatable :: d2f_dn2(:)     ! Derivadas segundas em n
end type
```

### 4. Testes: Fortuno

**Por quê?**
- Framework moderno para Fortran
- Sintaxe clara e expressiva
- Integração nativa com fpm
- Suporte a fixtures e parametrização

**Exemplo:**
```fortran
module test_bethe_ansatz
    use fortuno_serial, only: test_item, check => serial_check
    use bethe_ansatz
    implicit none
    
contains
    
    function test_free_fermions() result(tests)
        type(test_item) :: tests
        
        real(real64) :: E_calculated, E_exact
        
        ! U=0 → Fermi gas livre
        call solve_lieb_wu(N=10, U=0.0_real64, E=E_calculated)
        E_exact = -4.0_real64 / pi * integrate_fermi_sea(N, L)
        
        call check(abs(E_calculated - E_exact) < 1e-10, &
                   "Free fermions energy")
    end function
    
end module
```

### 5. Convenções de Código

**Indexação:**
- Arrays 1-indexed para sítios físicos (convenção natural do problema)
- 0-indexed quando apropriado (ex: índices auxiliares)

**Precisão:**
```fortran
use, intrinsic :: iso_fortran_env, only: real64
integer, parameter :: dp = real64
real(dp) :: variable  ! Float64 (double precision)
```

**Nomes:**
- Módulos: `snake_case` (ex: `bethe_ansatz`)
- Tipos: `snake_case_t` (ex: `system_params_t`)
- Funções/subrotinas: `snake_case` (ex: `solve_newton`)
- Constantes: `UPPER_SNAKE_CASE` (ex: `MAX_ITER`)

**Documentação (FORD-compliant):**
```fortran
!> Resolve as equações de Lieb-Wu para o estado fundamental
!! do modelo de Hubbard 1D usando o método de Newton-Raphson.
!!
!! @param[in]  n_up    Número de elétrons spin-up
!! @param[in]  n_dn    Número de elétrons spin-down
!! @param[in]  L       Número de sítios
!! @param[in]  U       Interação de Hubbard
!! @param[out] k       Rapidities de carga
!! @param[out] Lambda  Rapidities de spin
!! @param[out] energy  Energia do estado fundamental
subroutine solve_lieb_wu(n_up, n_dn, L, U, k, Lambda, energy)
```

---

## 🧩 Solução das Equações de Lieb-Wu

### Estratégia implementada: Newton com Jacobiano analítico

> **Escopo desta seção (verificado em 2026-09-20).** `src/bethe_ansatz/nonlinear_solvers.f90`
> expõe exatamente `solve_newton`, `solve_linear_system` e `line_search`. **Não há Broyden**
> em lugar nenhum do código de produção: em `src/convergence/mixing_schemes.f90:8-10` só
> `linear_mixing` é público; `broyden_mixing` e `anderson_mixing` estão comentados. O item
> 4 abaixo é material **planejado, não implementado**, e o item 2 descreve uma heurística
> de seleção de método que **não existe**: todo tamanho de sistema usa `solve_newton`.

#### 1. Formulação do Problema

**Variáveis:** $\mathbf{x} = [k_1, k_2, \ldots, k_{N_\uparrow}, \Lambda_1, \Lambda_2, \ldots, \Lambda_M]$ onde $M = N_\downarrow$

**Sistema não-linear:** $\mathbf{F}(\mathbf{x}) = 0$

$$
F_j^k = k_j - \frac{2\pi}{L} I_j - \frac{1}{L} \sum_{\alpha=1}^{M} \theta(k_j - \Lambda_\alpha, U)
$$

$$
F_\alpha^\Lambda = \frac{2\pi}{L} J_\alpha - \sum_{j=1}^{N_\uparrow} \theta(\Lambda_\alpha - k_j, U) + \sum_{\substack{\beta=1 \\ \beta \neq \alpha}}^{M} \Theta(\Lambda_\alpha - \Lambda_\beta, U)
$$

**Jacobiano analítico:**
$$
\mathbf{J} = \begin{bmatrix}
\frac{\partial F^k}{\partial k} & \frac{\partial F^k}{\partial \Lambda} \\[1em]
\frac{\partial F^\Lambda}{\partial k} & \frac{\partial F^\Lambda}{\partial \Lambda}
\end{bmatrix}
$$

Com derivadas:
$$
\frac{d\theta}{dx} = \frac{4U}{U^2 + 4x^2}, \quad \frac{d\Theta}{dx} = \frac{2U}{U^2 + x^2}
$$

#### 2. Escolha do Método

**Não há escolha de método.** Para qualquer `N_up + N_dn`, o código chama
`solve_newton(x, I, J, L, U, converged, ierr)` com o Jacobiano analítico e o
`line_search` de Armijo descrito no item 3. A heurística de três faixas
(Newton / híbrido / Broyden puro) que constava aqui era um plano e nunca foi
escrita; ver a nota no topo desta seção.

#### 3. Newton com Line Search

**Algoritmo:**
```
1. Resolver J·Δx = -F  (via DGESV/DGETRF)
2. Line search: encontrar α ∈ (0,1] tal que
   ||F(x + α·Δx)|| < (1-c·α)·||F(x)||  (Armijo condition)
3. Atualizar: x ← x + α·Δx
4. Repetir até convergência
```

**Implementação:**
```fortran
subroutine newton_with_linesearch(x, tol, max_iter)
    do iter = 1, max_iter
        call compute_residual(x, F)
        call compute_jacobian(x, J)
        
        call solve_linear_system(J, -F, dx)  ! LAPACK
        
        ! Line search (backtracking)
        alpha = 1.0_real64
        do ls_iter = 1, 20
            x_trial = x + alpha * dx
            call compute_residual(x_trial, F_trial)
            
            if (norm2(F_trial) < 0.9_real64 * norm2(F)) exit
            alpha = 0.5_real64 * alpha
        end do
        
        x = x_trial
        
        if (norm2(F) < tol) exit
    end do
end subroutine
```

#### 4. Broyden (Quasi-Newton) — PLANEJADO, NÃO IMPLEMENTADO

**Ideia:** Aproximar $\mathbf{J}^{-1}$ iterativamente sem recalcular Jacobiano

**Atualização de Broyden:**
$$
\mathbf{B}_{k+1} = \mathbf{B}_k + \frac{(\Delta\mathbf{x} - \mathbf{B}_k \cdot \Delta\mathbf{F}) \otimes \Delta\mathbf{F}^T}{\Delta\mathbf{F}^T \cdot \Delta\mathbf{F}}
$$

Onde $\mathbf{B} \approx \mathbf{J}^{-1}$ (inversa aproximada).

**Vantagens:**
- Não precisa calcular $\mathbf{J}$ a cada iteração
- Custo $O(n^2)$ por iteração (vs $O(n^3)$ do Newton)

**Desvantagens:**
- Convergência superlinear (vs quadrática do Newton)
- Precisa de bom chute inicial

#### 5. Continuação em U (Preditor-Corretor)

**Objetivo:** Resolver para vários valores de U reutilizando soluções

**Algoritmo:**
```
1. Resolver para U₀ "fácil" (ex: U/t = 6 ou U → ∞)

2. Para cada passo i:
   a) Preditor: x_guess(Uᵢ₊₁) = x(Uᵢ) + ΔU · (dx/dU)
      - Estimar dx/dU via diferença finita ou implicitamente
   
   b) Corretor: Resolver F(x, Uᵢ₊₁) = 0 com chute x_guess
      - Usar Newton (`solve_newton`; é o único solver existente)
   
   c) Adaptar ΔU baseado em número de iterações:
      - Se convergiu rápido (< 4 iter): ΔU ← 1.2·ΔU
      - Se demorou (> 8 iter): ΔU ← 0.5·ΔU

3. Checkpoints: salvar x(U) a cada 10 pontos
```

**Sweep bidirecional:**
```
Forward:  U = 0 → 2 → 4 → 6 → ... → 10
Backward: U = 10 → 8 → 6 → ... → 0  (refinamento)
```

#### 6. Normalização e Escalonamento

**Problema:** $k \in [-\pi,\pi]$, $\Lambda \sim O(U)$ → mal-condicionado para U grande

**Solução:**
```fortran
! Escalonar variáveis
k_scaled = k / pi              ! k ∈ [-1, 1]
Lambda_scaled = Lambda / U     ! Λ ∈ O(1)

! Resolver sistema escalonado
call solve_newton(x_scaled, F_scaled, J_scaled)

! De-escalonar resultado
k = k_scaled * pi
Lambda = Lambda_scaled * U
```

#### 7. Critérios de Convergência

**Duplo critério:**
```fortran
converged = (norm2(F) < 1e-10_real64) .and. &
            (norm2(dx) / max(norm2(x), 1.0_real64) < 1e-12_real64)
```

**Fail-safes:**
```fortran
! Divergência
if (norm2(F) > 1e6 .or. any(ieee_is_nan(F))) then
    error stop "Solver divergiu!"
end if

! Estagnação
if (iter > max_iter) then
    print *, "Warning: máximo de iterações atingido"
    exit
end if
```

#### 8. Números Quânticos (Estado Fundamental)

**Distribuição de Fermi:**
```fortran
! Carga (spin-up)
do j = 1, N_up
    I(j) = j - (N_up + 1) / 2  ! Centrado, consecutivo
end do

! Spin (spin-down)
M = N_dn
do alpha = 1, M
    J(alpha) = alpha - (M + 1) / 2  ! Centrado, consecutivo
end do
```

Para $N_\uparrow=5$: $I = [-2, -1, 0, 1, 2]$  
Para $N_\downarrow=3$: $J = [-1, 0, 1]$

#### 9. Validação

**Casos limite (testes unitários):**

```fortran
! 1. U=0 (Fermi gas livre)
E_exact = -4/π ∫₀^(πn/2) cos(k) dk

! 2. U→∞ (forte acoplamento)
E_exact ~ -4·J₀(πn)  ! Função de Bessel

! 3. Half-filling (n=1, m=0)
E_exact = -4·J₀(U)

! 4. Polarizado (n=m)
E_exact = -2·cos(πn/2) - U·n²/4
```

#### 10. Paralelização

Grid $(n, m, U)$ é **embaraçosamente paralelo**:

```fortran
!$omp parallel do schedule(dynamic) private(solution)
do i_U = 1, n_U_points
    do i_n = 1, n_density_points
        do i_m = 1, n_mag_points(i_n)
            call solve_lieb_wu(n(i_n), m(i_m), U(i_U), solution)
            
            exc_table(i_n, i_m, i_U) = solution%exc
            Vxc_up_table(i_n, i_m, i_U) = solution%Vxc_up
            Vxc_dn_table(i_n, i_m, i_U) = solution%Vxc_dn
        end do
    end do
end do
!$omp end parallel do
```

---

## 📅 Roadmap de Desenvolvimento

### Fase 0: Infraestrutura ✅ 100% COMPLETO

- [x] Criar estrutura fpm
- [x] Módulo de tipos (`lsda_types.f90`)
- [x] Módulo de constantes (`lsda_constants.f90`)
- [x] Configurar Fortuno (dependência instalada)
- [x] Programa principal placeholder (`app/main.f90`)

**Status:** ✅ 

---

### Fase 1: Bethe Ansatz ✅ 100% COMPLETO

#### ✅ Completo:
- [x] **`bethe_equations.f90`** (487 linhas, 100% testado):
  - [x] Funções θ e Θ (espalhamento carga-spin e spin-spin)
  - [x] Derivadas dθ/dx, dΘ/dx (analíticas, validadas numericamente)
  - [x] Derivadas dθ/dU, dΘ/dU (para continuation method)
  - [x] `initialize_quantum_numbers()` - Estado fundamental (distribuição de Fermi)
  - [x] `compute_residual()` - Vetor F(x) das equações de Lieb-Wu
  - [x] `compute_jacobian()` - Matriz Jacobiana analítica (4 blocos)
  - [x] `compute_dFdU()` - Derivada do resíduo para preditor-corretor
  - [x] `compute_energy()` - Energia do estado fundamental E = -2·Σcos(k_j)
  - [x] Tratamento especial para U=0 (Fermi gas livre)

- [x] **`nonlinear_solvers.f90`** (303 linhas, 100% testado):
  - [x] `solve_linear_system()` - Wrapper LAPACK DGESV com LU decomposition
  - [x] `line_search()` - Backtracking com condição de Armijo
  - [x] `solve_newton()` - Newton-Raphson com line search adaptativo
  - [x] Tratamento especial para U=0 (solução analítica do Fermi gas)
  - [x] Detecção de estagnação, divergência e convergência
  - [x] Robustez: NaN checking, singular matrix handling

- [x] **`continuation.f90`** (369 linhas, 100% testado):
  - [x] `estimate_dxdU()` - Estimativa de dx/dU via diferenças finitas
  - [x] `sweep_U_forward()` - Sweep forward (U_min → U_max) com preditor linear
  - [x] `sweep_U_backward()` - Sweep backward (U_max → U_min) para refinamento
  - [x] `sweep_U_bidirectional()` - Média de forward + backward (maior precisão)
  - [x] Predictor-corrector: típico speedup de 5-10x vs soluções independentes

- [x] **`test/test_bethe_equations.f90`** (446 linhas, 17 testes ✅):
  - [x] Funções θ e Θ: zeros, antissimetria
  - [x] Derivadas analíticas vs numéricas: dθ/dx, dΘ/dx, dθ/dU, dΘ/dU
  - [x] Números quânticos: pares e ímpares
  - [x] Residual: dimensões, valores
  - [x] Jacobiano: dimensões, diagonal, validação numérica (< 1e-10)
  - [x] dF/dU: validação numérica
  - [x] Energia: U=0, dimensões

- [x] **`test/test_nonlinear_solvers.f90`** (302 linhas, 9 testes ✅):
  - [x] Sistema linear: 2×2, identidade, preservação de inputs
  - [x] Jacobiano: validação numérica
  - [x] Newton: Fermi gas (U=0), sistema pequeno (U=4)
  - [x] Convergência: flags, redução de resíduo
  - [x] Line search: eficácia

- [x] **`test/test_continuation.f90`** (198 linhas, 5 testes ✅):
  - [x] `estimate_dxdU`: diferenças finitas simples
  - [x] `sweep_forward`: 3 pontos, convergência total
  - [x] `sweep_backward`: 3 pontos
  - [x] `sweep_bidirectional`: consistência entre métodos

#### 🏆 Conquistas da Fase 1:
- ✅ **31 testes unitários** passando (100% de sucesso)
- ✅ **Jacobiano conferido numericamente** (erro < 1e-10) — checagem de autoconsistência,
  não validação externa: compara o Jacobiano analítico com a derivada numérica do **mesmo**
  resíduo. Foi por isso que o fator `sin k` ausente no resíduo sobreviveu a essa checagem
  até a fase 4 (ver README.md, "Internal consistency checks").
- ✅ **Continuation method implementado**: predictor-corrector com sweeps bidirecional
- ✅ **Casos especiais tratados**: U=0 (Fermi gas livre)
- ✅ **Newton robusto**: Line search + detecção de estagnação + NaN checking
- ✅ **Código documentado**: Comentários FORD-compliant em todos os módulos
- ✅ **Performance**: Continuation 5-10x mais rápido que soluções independentes

**Duração:** 4 dias
**Linhas de código:** ~1159 (produção) + ~946 (testes)
**Status:** ✅ **FASE 1 COMPLETA!**

---

### Fase 2: Geração e I/O de Tabelas ✅ COMPLETA

#### ✅ Completo (100%):
- [x] **`table_io.f90`** (~400+ linhas, totalmente testado):
  - [x] Tipo `xc_table_t` para armazenar tabelas XC
  - [x] `read_cpp_table()` - Leitura de tabelas ASCII legadas (formato C++)
  - [x] `write_fortran_table()` - Escrita em formato binário nativo Fortran
  - [x] `read_fortran_table()` - Leitura de formato binário (~10x mais rápido que ASCII)
  - [x] `extract_U_from_filename()` - Parser de nome de arquivo `lsda_hub_uX.XX`
  - [x] `deallocate_table()` - Gerenciamento de memória
  - [x] `print_table_info()` - Diagnóstico e debug

- [x] **`convert_tables.f90`** (executável utilitário):
  - [x] Conversão em batch de 25 tabelas C++ → Fortran binário
  - [x] Valores de U: 1.00, 1.10, 2.00, 3.00, 4.00, 4.10, 5.00, 5.90, 6.00, 6.10, 6.90, 7.00, 7.10, 7.90, 8.00, 8.10, 8.90, 9.00, 9.10, 10.00, 12.00, 14.00, 16.00, 18.00, 20.00
  - [x] Argumentos de linha de comando: `fpm run convert_tables -- <input_dir> <output_dir>`
  - [x] Relatório de progresso e estatísticas de conversão

- [x] **`test_table_io.f90`** (274 linhas - 10 testes unitários):
  - [x] Leitura de tabelas C++ ASCII
  - [x] Escrita/leitura de formato binário Fortran
  - [x] Validação de roundtrip (ASCII → binário → memória)
  - [x] Parsing de U a partir do nome do arquivo

- [x] **`bethe_tables.f90`** (325 linhas, 6 testes - totalmente implementado):
  - [x] Tipo `grid_params_t` para configurar grid de densidades
  - [x] `compute_E0()` - Energia não-interagente (Fermi gas livre)
  - [x] `compute_E_xc()` - Energia XC: E_xc = E_BA - E_0
  - [x] `compute_V_xc_numerical()` - Potenciais XC via derivadas de 5 pontos
  - [x] `generate_xc_table()` - Geração completa de tabela para dado U
  - [x] `generate_table_grid()` - Geração flexível de grid com parâmetros customizados
  - [x] Tratamento especial para casos limite:
    - [x] U=0 (Fermi gas livre - retorna E_xc=0)
    - [x] Half-filling (n=1, m=0)
    - [x] Polarizado (m=n)
  - [x] Integração total com módulos `bethe_equations`, `nonlinear_solvers`, `table_io`

- [x] **`test_bethe_tables.f90`** (170 linhas - 6 testes):
  - [x] Teste E0 para half-filling
  - [x] Teste E0 para sistema polarizado
  - [x] Teste E_xc = 0 para U=0
  - [x] Teste simetria V_xc (V_xc_up = V_xc_dn quando n_up = n_dn)
  - [x] Teste parâmetros padrão do grid
  - [x] Teste geração de tabela pequena

#### 🎉 Conquistas da Fase 2:
- ✅ **16 testes unitários** (10 I/O + 6 geração) passando (100%)
- ✅ **Pipeline completo**: Bethe Ansatz → E_xc → V_xc → Tabela → I/O
- ✅ **Derivadas numéricas** de 5 pontos para alta precisão
- ✅ **Grid flexível** com parâmetros configuráveis
- ✅ **Casos especiais** corretamente tratados
- ✅ **Total Fase 2:** 888 linhas produção + 444 linhas testes

**Duração:** ~3 dias
**Status:** ✅ **FASE 2 COMPLETA!**

#### 🔜 Melhorias Futuras (Opcionais):
- [ ] Paralelização OpenMP do grid (n, m) - embaraçosamente paralelo
- [ ] Validação física: comparação quantitativa com tabelas C++ legadas
- [ ] Otimização de performance (profiling, vetorização)
- [ ] `table_manager.f90`: Cache inteligente para múltiplos U

---

### Fase 3: Interpolação de Splines 2D ✅ COMPLETA

**Objetivo:** Implementar interpolação bicúbica 2D para avaliar funcionais XC em pontos arbitrários (n, m).

#### ✅ Completo (100%):
- [x] **`spline2d.f90`** (351 linhas, 5 testes, 100% testado):
  - [x] Tipo `spline2d_t` para armazenar coeficientes da spline em grids irregulares
  - [x] `spline1d_coeff()` - Algoritmo de Thomas para spline 1D (natural/clamped BC)
  - [x] `spline2d_init()` - Construir splines separáveis a partir de tabela 2D
  - [x] `spline2d_eval()` - Avaliar spline em ponto (n, m) via interpolação separável
  - [x] `find_interval()` - Busca binária para localizar intervalo do grid
  - [x] Tratamento de grids irregulares (n_y varia com x)
  - [x] Arrays 0-indexed internos para compatibilidade com algoritmo clássico

- [x] **`xc_lsda.f90`** (335 linhas, 6 testes, 100% testado):
  - [x] Tipo `xc_lsda_t` contendo splines de exc, vxc_up, vxc_dw
  - [x] `xc_lsda_init()` - Carregar tabela e construir 3 splines (exc, vxc_up, vxc_dw)
  - [x] `get_exc(n_up, n_dw)` - Energia XC por partícula via interpolação
  - [x] `get_vxc(n_up, n_dw, v_xc_up, v_xc_dw)` - Potenciais XC para ambos os spins
  - [x] Conversão (n_up, n_dw) ↔ (n, m) via `convert_to_nm()`
  - [x] **4 regiões de simetria física** mapeadas para Region I:
    - [x] Region I (m≥0, n≤1): Identidade
    - [x] Region II (m<0, n≤1): Spin exchange
    - [x] Region III (m<0, n>1): Particle-hole
    - [x] Region IV (m≥0, n>1): Combinada
  - [x] Tratamento especial para U=0, n=0, densidades fora da faixa física

- [x] **`test_spline2d.f90`** (196 linhas, 5 testes ✅):
  - [x] Init/destroy: alocação, inicialização, cleanup
  - [x] Interpolação exata em pontos do grid (erro < 1e-9)
  - [x] Funções lineares: spline exata para f(x,y) = ax + by + c
  - [x] Funções separáveis: f(x,y) = g(x)·h(y) com alta precisão
  - [x] Casos limite: single x point, bounds checking

- [x] **`test_xc_lsda.f90`** (200 linhas, 6 testes ✅):
  - [x] Init/destroy com tabelas reais (U=4.00, U=2.00)
  - [x] Avaliação de exc retorna valores válidos e não-zero para U>0
  - [x] **Simetria de spin**: exc(n_up, n_dw) = exc(n_dw, n_up)
  - [x] **Simetria de potenciais**: V_up(n_up, n_dw) = V_dw(n_dw, n_up)
  - [x] Determinação de regiões (I, II, III, IV)
  - [x] Transformações de simetria corretas

#### 🏆 Conquistas da Fase 3:
- ✅ **11 testes unitários** passando (100% de sucesso)
- ✅ **Spline 2D separável** implementada com grid irregular
- ✅ **Simetrias físicas** mapeando todo o domínio (n, m) para tabela compacta
- ✅ **Integração total** com pipeline Bethe → Tabelas → Splines
- ✅ **Código robusto**: tratamento de U=0, densidades zero, bounds checking
- ✅ **Convenção padronizada**: n_dw (não n_dn) para spin-down
- ✅ **Total Fase 3:** 686 linhas produção + 396 linhas testes

**Estratégia Implementada:**
1. ✅ Spline 1D em cada direção (separável)
2. ✅ Para cada n_i fixo: spline cúbica natural em m
3. ✅ Com valores interpolados: interpolação linear em n
4. ✅ Simetrias físicas reduzem domínio de [0,1]×[-1,1] → [0,1]×[0,n]

**Duração:** ~2 dias
**Status:** ✅ **FASE 3 COMPLETA!**

---

### Fase 4: Potenciais & Sistema de Erros ✅ COMPLETA

**Objetivo:** Implementar sistema de potenciais externos e tratamento centralizado de erros.

#### ✅ Completo (100%):
- [x] **`lsda_errors.f90`** (224 linhas, 13 testes):
  - [x] Códigos de erro organizados por categoria (input 1-99, numerical 100-199, I/O 200-299, memory 300-399)
  - [x] `get_error_message()` - Mensagens legíveis para cada código de erro
  - [x] `error_handler()` - Handler centralizado com opção fatal
  - [x] `check_bounds()`, `check_positive()`, `check_range()` - Utilitários de validação

- [x] **`potential_uniform.f90`** (34 linhas): V(i) = V₀
  - [x] Potencial constante (shift global de energia)

- [x] **`potential_harmonic.f90`** (46 linhas): V(i) = 0.5·k·(i-center)²
  - [x] Armadilha harmônica parabólica
  - [x] Simetria de paridade V(i) = V(L+1-i)
  - [x] Modela optical traps, cria shell structure

- [x] **`potential_impurity.f90`** (191 linhas):
  - [x] `potential_impurity_single()` - Impureza pontual única
  - [x] `potential_impurity_multiple()` - Múltiplas impurezas (com soma se sobrepõem)
  - [x] `potential_impurity_random()` - Impurezas aleatórias com concentração fixa

- [x] **`potential_random.f90`** (152 linhas):
  - [x] `potential_random_uniform()` - Desordem uniforme V(i) ~ U[-W/2, W/2]
  - [x] `potential_random_gaussian()` - Desordem gaussiana V(i) ~ N(0, σ²)
  - [x] Box-Muller transform para geração de normais
  - [x] Modela localização de Anderson

- [x] **`potential_barrier.f90`** (157 linhas):
  - [x] `potential_barrier_single()` - Barreira retangular única
  - [x] `potential_barrier_double()` - Dupla barreira (poço quântico)
  - [x] Tunelamento quântico, ressonâncias Fabry-Pérot

- [x] **`potential_quasiperiodic.f90`** (100 linhas): V(i) = λ·cos(2πβi + φ)
  - [x] Aubry-André-Harper (AAH) model
  - [x] Extended phase (λ < 2): estados deslocalizados
  - [x] Critical phase (λ = 2): funções de onda multifractais
  - [x] Localized phase (λ > 2): estados exponencialmente localizados
  - [x] Modela localização de Anderson sem desordem

- [x] **`potential_factory.f90`** (186 linhas):
  - [x] `create_potential()` - Factory para criar potenciais via string
  - [x] `get_potential_info()` - Informações sobre cada tipo
  - [x] Interfaces para 10 identificadores: `uniform`, `harmonic`, `impurity_single`, `impurity_multiple`, `impurity_random`, `random_uniform`, `random_gaussian`, `barrier_single`, `barrier_double` e `quasiperiodic`. Esta é a lista **reconhecida pelo factory**, que não coincide com a lista
de strings **aceitas no namelist** (`app/main.f90`, documentada no `README.md`): o namelist
aceita o alias legado `impurity` para o posicionamento aleatório, enquanto o factory conhece
`impurity_random`. `create_potential()` cria diretamente oito deles; os dois identificadores adicionais de impureza são atendidos pelas rotinas especializadas, e a documentação de alto nível agrupa essas variantes em famílias.

- [x] **`test_potentials.f90`** (585 linhas, 21 testes):
  - [x] Testes com explicações físicas detalhadas nos comentários
  - [x] Uniform: constância, Harmonic: simetria/mínimo central
  - [x] Impurity: posição/bounds/overlap/concentração
  - [x] Random: média zero, distribuições corretas
  - [x] Barrier: largura/bounds/poço quântico/não-sobreposição
  - [x] Quasiperiodic: golden ratio, phase shift, critical point, localization
  - [x] Factory: criação/comparação/tipo inválido

- [x] **`test_lsda_errors.f90`** (284 linhas, 13 testes):
  - [x] Verificação de códigos em intervalos corretos
  - [x] Mensagens para todos os tipos de erro
  - [x] Utilitários de validação (bounds, positive, range)

#### 🏆 Conquistas da Fase 4:
- ✅ **34 testes unitários** passando (100% de sucesso)
- ✅ **10 identificadores de potencial** implementados, agrupados em famílias na interface de alto nível
- ✅ **Sistema de erros robusto** para todo o projeto
- ✅ **Factory pattern** para criação dinâmica de potenciais
- ✅ **Documentação física detalhada** em todos os testes
- ✅ **Total Fase 4:** 1090 linhas produção + 869 linhas testes

**Física Implementada:**
- ✅ Armadilha harmônica (optical traps, cold atoms)
- ✅ Localização de Anderson (random disorder & quasiperiodic AAH)
- ✅ Transição metal-isolante (AAH model, λ = 2 critical point)
- ✅ Tunelamento quântico (barriers)
- ✅ Ressonâncias Fabry-Pérot (double barriers)
- ✅ Impurezas magnéticas (random impurities)

**Duração:** ~1-2 dias
**Status:** ✅ **FASE 4 COMPLETA!**

---

### Fase 5: Hamiltonian & Diagonalization ✅ COMPLETA (escopo revisto)

- [x] `boundary_conditions.f90`: BC_OPEN, BC_PERIODIC, BC_TWISTED ✅
- [x] `hamiltonian_builder.f90`: Tight-binding com V_eff ✅
- [x] `lapack_wrapper.f90`: MRRR parcial com DSTEVR (OBC) e ZHEEVR (demais BCs); DSYEVR só nos caminhos de teste/legado ✅
- [ ] `degeneracy_handler.f90`: QR/Gram-Schmidt para degenerescências — **removido de `src/`**;
      hoje é código morto em `extras/dead_code/`, não compilado e sem nenhum chamador.
      A quase-degenerescência é tratada pela ocupação C¹ em `density_calculator.f90` (T7).
- [x] Testes: `test_boundary_conditions` (48), `test_hamiltonian_builder` (44),
      `test_lapack_wrapper` (42) — 134 asserções ✅

**Status:** ✅ COMPLETO! Pipeline Hamiltonian → Diagonalization funcional.

---

### Fase 6: Densidade & Ciclo SCF ✅ 100% COMPLETO

- [x] `density_calculator.f90`: n_σ(i) = Σⱼ |ψⱼ(i)|² ✅
- [x] `convergence_monitor.f90`: Normas L1/L2/L∞, histórico ✅
- [x] `mixing_schemes.f90`: Linear mixing ✅
- [x] `adaptive_mixing.f90`: Classe Convergencia (C++ compat) ✅
- [x] `kohn_sham_cycle.f90`: **Loop SCF completo (CRITICAL!)** ✅
  - [x] **REFATORAÇÃO CRÍTICA:** Mudança de density mixing → **potential mixing** ✅
  - [x] Convergência em casos difíceis: U=-4, V=-4, 50% impurities ✅
  - [x] Dual convergence check (density OR energy) ✅
- [x] Testes: `test_kohn_sham_cycle` (238), `test_density_calculator` (118),
      `test_adaptive_mixing` (58), `test_convergence_monitor` (41),
      `test_mixing_schemes` (16) — 471 asserções ✅

**🎉 MILESTONE:** Código funcional end-to-end! SCF converge em sistemas complexos!

---

### Fase 7: I/O & Interface ✅ COMPLETA (escopo revisto)

- [x] `input_parser.f90`: Parse namelist (system, potential, scf) ✅
- [x] `output_writer.f90`: Escrita de resultados (densidades, eigenvalues, energia) ✅
- [ ] `logger.f90`: Sistema de logging com níveis — **nunca foi escrito**; não existe no
      repositório. A saída é feita direto por `output_writer.f90` e `print`.
- [x] `main.f90`: Ponto de entrada com argumentos de linha de comando ✅
- [ ] `run_simulation.f90`: Runner principal — **nunca foi escrito**; `app/` contém apenas
      `main.f90`, `convert_tables.f90` e `generate_table.f90`. O pipeline é integrado
      dentro do próprio `main.f90`.
- [x] Testes: `test_input_parser` (130) e `test_output_writer` (133) — 263 asserções ✅
- [ ] Documentação: `INPUT_FORMAT.md` / `OUTPUT_FORMAT.md` não existem; o formato de
      entrada está documentado na tabela de namelist do `README.md` e a documentação
      de API gerada por FORD está em `doc/`.

**🎉 GRAND MILESTONE:** **CÓDIGO PRODUCTION-READY!** 🎉

---

### Fase 8: Otimização (OPCIONAL - Futuro)

- [ ] `symmetry.f90`: Explorar simetria de paridade (speedup 4x)
- [ ] Paralelização OpenMP (Bethe Ansatz + KS loop)
- [ ] Profiling e otimização de hotspots
- [ ] Documentação completa (FORD)
- [ ] Benchmarks vs código C++ original

---

## 🧪 Estratégia de Testes

### Pirâmide de Testes

```
         /\
        /  \
       /E2E \       (End-to-End: ciclo completo, casos físicos)
      /------\
     /Integr. \     (Integração: módulos combinados)
    /----------\
   /Unit Tests  \   (Unitários: funções individuais)
  /--------------\
```

### Tipos de Testes

#### 1. Testes Unitários (Fortuno)
```fortran
! test/test_bethe_equations.f90
- test_theta_function()
- test_residual_computation()
- test_jacobian_analytical_vs_numerical()
- test_quantum_numbers_initialization()

! test/test_splines.f90
- test_spline1d_linear_function()
- test_spline1d_quadratic_function()
- test_spline2d_separable_function()
- test_interpolation_accuracy()

! test/test_hamiltonian.f90
- test_tight_binding_matrix_open_bc()
- test_tight_binding_matrix_periodic_bc()
- test_eigenvalues_free_fermions()
```

#### 2. Testes de Integração
```fortran
! test/test_integration.f90
- test_bethe_to_splines_pipeline()
- test_hamiltonian_diagonalization_with_xc()
- test_ks_single_iteration()
```

#### 3. Testes End-to-End
```fortran
! test/test_e2e.f90
- test_fermi_gas_u0()
- test_half_filling_u4()
- test_harmonic_trap_convergence()
```

#### 4. Testes de Regressão
- Comparar saída com resultados do código C++ original
- Armazenar resultados de referência em `data/reference_results/`

### Cobertura de Código

**Meta:** > 80% de cobertura

```bash
# Usando gfortran + gcov
fpm test --flag "-fprofile-arcs -ftest-coverage"
gcov src/**/*.f90
lcov --capture --directory . --output-file coverage.info
genhtml coverage.info --output-directory coverage_html
```

---

## 🔬 Física e Validação

### Casos de Validação Obrigatórios

#### 1. Fermi Gas (U=0)
```
Input:  N=20, L=20, U=0, BC=periodic
Output: E/L = -2·sin(π/2) / π ≈ -0.6366
        n(i) = 1.0 (uniforme)
```

#### 2. Half-Filling (n=1)
```
Input:  N=L, U=4.0, BC=periodic
Output: E/L = função de U (comparar com Essler et al.)
        n(i) = 1.0 (uniforme)
        m = 0 (não-magnético)
```

#### 3. Armadilha Harmônica
```
Input:  N=20, L=40, U=4.0, V(i) = k*(i-L/2)^2
Output: n(i) = perfil gaussiano (shell structure)
        Comparar com Thomas-Fermi para k→0
```

#### 4. Dupla Barreira (Quantum Well)
```
Input:  Dupla barreira, U=4.0
Output: Estados localizados no poço
        Tunelamento ressonante
```

### Benchmarks de Performance

| Caso                  | C++ (original) | Fortran (meta) | Status |
|-----------------------|----------------|----------------|--------|
| Bethe (N=100)         | N/A (tabelas)  | < 1s           | 🔜     |
| Spline interpolation  | ~10μs          | < 5μs          | 🔜     |
| Diagonalização (N=100)| ~50ms (Givens) | < 5ms (LAPACK) | 🔜     |
| Ciclo KS (10 iter)    | ~5s            | < 2s           | 🔜     |

---

## 📋 Parâmetros Técnicos Definidos

### Intervalo de U
- **Range:** 0 ≤ U/t ≤ 100
- **Unidades:** U em unidades de hopping t
- **Casos especiais:**
  - U = 0: Fermi gas livre
  - U → ∞: Limite de forte acoplamento

### Tamanhos de Sistema
- **Sítios (L):** Até 200 sites
- **Elétrons (N):** 0 ≤ N ≤ 2L
- **Densidades:** 0 ≤ n = N/L ≤ 2
  - n = 1: Half-filling (caso especial)
  - n < 1: Dopagem tipo-n
  - n > 1: Dopagem tipo-p

### Precisão Numérica
- **Padrão:** `real64` (double precision, ~16 dígitos)
- **Futuro:** Possível upgrade para `real128` se necessário
- **Tolerância:** TOL = 1.0e-16 (padrão do código original)
- **Threshold para U=0:** SMALL = 1.0e-9

### Build e Compilação
```bash
# Build padrão
fpm build

# Build otimizado
fpm build --profile release --flag "-O3 -march=native"

# Com OpenMP (futuro)
fpm build --flag "-fopenmp"

# Rodar
fpm run

# Testes
fpm test
```

---

## 🎁 Bonus Features (Pós-Finalização)

Esta seção lista features avançadas para implementação **após** a conclusão da Fase 6 (ciclo SCF básico). Estas features expandem as capacidades do código além do escopo inicial, mas não são necessárias para um solver LSDA funcional.

### 1. Broyden e Anderson Mixing 🚀

**Motivação:**
Linear mixing (α-mixing) funciona, mas pode ser lento para sistemas com fortes correlações. Métodos acelerados (Broyden, Anderson) aproveitam informação de iterações anteriores para acelerar convergência.

**Física:**
- **Broyden mixing**: Aproximação quasi-Newton que estima Jacobiano inverso
  - Típico speedup: 2-5x em comparação com linear mixing
  - Armazena histórico de Δn e ΔV para construir aproximação
  - Excelente para sistemas metálicos

- **Anderson mixing**: Minimiza resíduo em subespaço de iterações anteriores
  - Também conhecido como DIIS (Direct Inversion in Iterative Subspace)
  - Robusto para sistemas isolantes
  - Parâmetro m (dimensão do subespaço): tipicamente m = 3-8

**Implementação sugerida:**
```fortran
! Em src/convergence/mixing_schemes.f90

!> Broyden mixing com histórico de iterações
subroutine broyden_mixing(n_new, n_old, history, n_mixed, ierr)
    real(dp), intent(in) :: n_new(:), n_old(:)
    type(broyden_history_t), intent(inout) :: history
    real(dp), intent(out) :: n_mixed(:)
    integer, intent(out) :: ierr

    ! Atualiza histórico: Δn_i, Δf_i
    ! Calcula aproximação Jacobiano inverso J^{-1}
    ! n_mixed = n_old + β·J^{-1}·(n_new - n_old)
end subroutine

!> Anderson mixing (DIIS)
subroutine anderson_mixing(n_new, n_old, history, m, n_mixed, ierr)
    real(dp), intent(in) :: n_new(:), n_old(:)
    type(anderson_history_t), intent(inout) :: history
    integer, intent(in) :: m  ! Dimensão do subespaço
    real(dp), intent(out) :: n_mixed(:)
    integer, intent(out) :: ierr

    ! Armazena últimas m iterações
    ! Resolve problema de mínimos quadrados para coeficientes
    ! n_mixed = Σᵢ cᵢ·n_i com Σcᵢ = 1
end subroutine
```

**Referências:**
- D.D. Johnson, PRB 38, 12807 (1988) - Broyden mixing original
- P. Pulay, Chem. Phys. Lett. 73, 393 (1980) - Anderson/DIIS
- Kresse & Furthmüller, Comp. Mat. Sci. 6, 15 (1996) - Implementação em VASP

**Esforço estimado:** 2-3 dias (implementação + testes)

---

### 2. Sistemas com Magnetização (N↑ ≠ N↓) 🧲

**Motivação:**
Atualmente o código assume sistemas **não-polarizados** (N_up = N_down). Permitir N_up ≠ N_down habilita estudo de:
- **Isolantes de Mott** polarizados
- **Transições ferromagnéticas**
- **Efeitos Zeeman** (campo magnético externo)
- **Física de spin** (frustração, ondas de spin)

**Física:**
- **Magnetização total**: M = N↑ - N↓
- **Densidade de spin**: m(i) = n↑(i) - n↓(i)
- **Energia Zeeman**: E_Z = -B·M (campo magnético B)
- **XC funcional**: Já suporta! `get_vxc(n_up, n_dw, v_up, v_dw)` funciona para qualquer n↑, n↓

**Implementação sugerida:**

1. **Modificar `density_calculator.f90`:**
```fortran
! Adicionar suporte explícito para N_up ≠ N_down
subroutine compute_density_spinful_polarized(eigvecs_up, eigvecs_dw, &
                                               N_up, N_dw, L, &
                                               n_up, n_dw, ierr)
    ! N_up e N_down podem ser diferentes
    ! Já funciona! Apenas documentar melhor.
end subroutine
```

2. **Adicionar campo magnético externo:**
```fortran
! Em src/potentials/potential_zeeman.f90
subroutine apply_potential_zeeman(B, L, V_up, V_down, ierr)
    real(dp), intent(in) :: B  ! Campo magnético
    integer, intent(in) :: L
    real(dp), intent(out) :: V_up(:), V_down(:)

    ! V_up(i) = -B (favorece spin-up)
    ! V_down(i) = +B (favorece spin-down)
end subroutine
```

3. **Modificar `ks_cycle.f90`:**
```fortran
! Permitir N_up ≠ N_down como input
type(ks_params_t) :: params
params%N_up = 5
params%N_down = 3  ! Sistema polarizado!
```

**Casos de teste:**
- N↑ = N, N↓ = 0 (totalmente polarizado) → Deve recuperar Fermi gas sem interação
- N↑ = 6, N↓ = 4, U > 0 → Verificar se m(i) ≠ 0 (magnetização local)
- Campo Zeeman B > 0 → M deve aumentar com B

**Referências:**
- Lieb & Mattis, Phys. Rev. 125, 164 (1962) - Magnetização em 1D
- Takahashi, Prog. Theor. Phys. 42, 1098 (1969) - Bethe Ansatz com polarização

**Esforço estimado:** 1-2 dias (já quase funciona!)

---

### 3. Temperatura Finita (T > 0) 🌡️

**Motivação:**
O código atual assume **T = 0** (ground state). Adicionar temperatura permite:
- **Propriedades termodinâmicas** (entropia, calor específico, susceptibilidade)
- **Transições de fase** térmicas (Mott transition vs T)
- **Comparação com experimentos** (átomos frios em T ≠ 0)
- **Equações de Yang-Yang** (generalização do Bethe Ansatz)

**Física:**
- **Distribuição de Fermi-Dirac**: f(E) = 1/(exp((E-μ)/kT) + 1)
- **Potencial químico μ**: Ajustado para fixar N = Σ f(Eᵢ)
- **Energia livre**: F = E - TS (minimizar ao invés de E)
- **Yang-Yang (1969)**: Solução exata do Hubbard model para T > 0

**Implementação sugerida:**

1. **Modificar `density_calculator.f90`:**
```fortran
!> Distribuição de Fermi-Dirac para T > 0
subroutine fill_fermi_dirac(eigenvals, N_electrons, T, occupations, mu, ierr)
    real(dp), intent(in) :: eigenvals(:)
    integer, intent(in) :: N_electrons
    real(dp), intent(in) :: T  ! Temperatura (unidades de t)
    real(dp), intent(out) :: occupations(:)  ! f(E) ∈ [0,1]
    real(dp), intent(out) :: mu  ! Potencial químico
    integer, intent(out) :: ierr

    ! 1. Encontrar μ tal que Σf(Eᵢ, μ, T) = N
    ! 2. Calcular occupations(i) = 1/(exp((E_i-μ)/T) + 1)
end subroutine

!> Densidade com ocupações fracionárias
subroutine compute_density_finite_T(eigvecs, occupations, L, density, ierr)
    real(dp), intent(in) :: eigvecs(:,:)
    real(dp), intent(in) :: occupations(:)  ! Não mais {0,1}!
    integer, intent(in) :: L
    real(dp), intent(out) :: density(:)

    ! n(i) = Σⱼ f(Eⱼ)·|ψⱼ(i)|²
end subroutine
```

2. **Adicionar cálculo de entropia:**
```fortran
!> Entropia de Fermi-Dirac
function compute_entropy(occupations) result(S)
    real(dp), intent(in) :: occupations(:)
    real(dp) :: S
    integer :: i

    S = 0.0_dp
    do i = 1, size(occupations)
        if (occupations(i) > 0.0_dp .and. occupations(i) < 1.0_dp) then
            S = S - occupations(i)*log(occupations(i)) &
                  - (1-occupations(i))*log(1-occupations(i))
        end if
    end do
end function
```

3. **Yang-Yang (avançado - opcional):**
```fortran
! Em src/bethe_ansatz/yang_yang.f90
!> Equações de Yang-Yang para T > 0
subroutine solve_yang_yang(N, L, U, T, free_energy, ierr)
    ! Integral equations para distribuições de quasi-partículas
    ! Muito mais complexo que Bethe Ansatz (equações integrais não-lineares)
    ! Referência: Yang & Yang, J. Math. Phys. 10, 1115 (1969)
end subroutine
```

**Simplificação inicial:**
- Começar com **T > 0 apenas no SCF** (usar Kohn-Sham T=0, mas ocupar níveis com Fermi-Dirac)
- Yang-Yang (solução exata T > 0) fica como feature avançada

**Casos de teste:**
- T → 0: Deve recuperar ground state (ocupações → {0,1})
- T >> |E_gap|: Ocupações suavizadas, S > 0
- Metal vs isolante: Calor específico C(T) diferente

**Referências:**
- Yang & Yang, J. Math. Phys. 10, 1115 (1969) - Equações originais
- Takahashi, Thermodynamics of One-Dimensional Solvable Models (1999) - Livro completo
- Klümper, Z. Phys. B 91, 507 (1993) - Método Quantum Transfer Matrix (TQ)

**Esforço estimado:**
- T > 0 simplificado (Fermi-Dirac): 2-3 dias
- Yang-Yang completo: 1-2 semanas (muito complexo!)

---

### Priorização Sugerida

Se você quiser implementar **apenas uma** bonus feature:

🥇 **1º lugar: Magnetização (N↑ ≠ N↓)**
- Menor esforço (~1-2 dias)
- Maior impacto científico (ferromagnetismo, Mott)
- Quase já funciona no código atual!

🥈 **2º lugar: Broyden/Anderson Mixing**
- Esforço médio (~2-3 dias)
- Acelera convergência (importante para produção)
- Útil para sistemas grandes

🥉 **3º lugar: Temperatura T > 0**
- Maior esforço (2-3 dias simplificado, 1-2 semanas completo)
- Física muito rica, mas mais complexa
- Yang-Yang é desafiador!

---

**Nota final:** Estas features são **opcionais** e devem ser implementadas **somente após** a Fase 6 estar completa (ciclo SCF básico funcionando). O objetivo principal é ter um código LSDA funcional primeiro! 🎯

---

### Papers Fundamentais

1. **Lieb & Wu (1968)**  
   "Absence of Mott transition in an exact solution of the short-range, one-band model in one dimension"  
   *Physical Review Letters*, 20(25), 1445.

2. **Essler et al. (2005)**  
   *The One-Dimensional Hubbard Model*  
   Cambridge University Press. (Livro completo sobre Bethe Ansatz)

3. **Capelle & Campo (2013)**  
   "Density functionals and model Hamiltonians: Pillars of many-particle physics"  
   *Physics Reports*, 528(3), 91-159.

4. **Xianlong et al. (2006)**  
   "Lattice density functional theory at finite temperature with strongly density-dependent exchange-correlation potentials"  
   *Physical Review B*, 73(16), 165120.

### Documentação Técnica

- **LAPACK Users' Guide**: https://netlib.org/lapack/lug/
- **Fortran 2018 Standard**: https://j3-fortran.org/
- **fpm Documentation**: https://fpm.fortran-lang.org/
- **Fortuno**: https://github.com/fortuno-repos/fortuno
- **FORD (Fortran Documenter)**: https://github.com/Fortran-FOSS-Programmers/ford

### Código de Referência

- Código C++ original (Vivaldo Campo Jr)
- DMFT solvers (TRIQS, w2dynamics)
- Exact diagonalization codes (ALPS, ITensor)

---

## 📝 Notas de Implementação

### Decisões Tomadas

1. **Números Quânticos**: São `real(dp)` (não `integer`) porque podem ser semi-inteiros quando N é par
2. **Índices**: Arrays 1-indexed para sítios físicos (convenção do problema)
3. **Precisão**: `real64` (double) é suficiente para U ∈ [0, 100]
4. **U → 0**: Tratamento especial em θ e Θ para evitar divisão por zero
5. **Jacobiano**: Implementação analítica (não diferenças finitas) para máxima precisão
6. **Documentação**: Padrão FORD para geração automática de docs

### TODOs e Decisões Pendentes

- [ ] **Grid de tabelas:** Quantos pontos (n,m,U)? Espaçamento uniforme ou adaptativo?
- [x] **Formato de output:** ✅ Binário Fortran nativo (implementado em `table_io.f90`)
- [x] **Formato de input:** ✅ ASCII C++ legado + binário Fortran
- [ ] **Paralelização:** OpenMP apenas ou também MPI para grids grandes?
- [ ] **Precisão:** Float64 suficiente ou Float128 em alguns casos?
- [ ] **Estados excitados:** Implementar? (mudando {I_j}, {J_α})
- [x] **Broyden:** ✅ Implementado apenas Newton (decisão: Newton suficiente para tabelas)
- [x] **Checkpointing:** ✅ Não necessário (continuation rápido o suficiente)

### Perguntas em Aberto

1. Como tratar U < 0 (interação atrativa)? Usar simetria ou resolver separadamente?
2. Implementar TBA (Thermodynamic Bethe Ansatz) para L → ∞?
3. Adicionar temperatura T > 0 (Yang-Yang)?
4. Implementar funcionais GGA além do LDA?

---

## 📊 Status do Projeto

**Versão:** 1.0.0
**Status:** Fases 1-7 implementadas; o pipeline roda de ponta a ponta. Há ressalvas
documentadas (variacionalidade do funcional, cobertura da validação contra o C++,
lacunas de empacotamento de inputs) — ver a seção "Status de Validação" e o `README.md`.
**Última atualização:** 2026-09-20

### Progresso Geral

```
[████████████████████████████████] 100% Fase 1: Bethe Ansatz Core (COMPLETO ✅)
[████████████████████████████████] 100% Fase 2: Geração de Tabelas XC (COMPLETO ✅)
[████████████████████████████████] 100% Fase 3: Splines 2D (COMPLETO ✅)
[████████████████████████████████] 100% Fase 4: Potenciais & Erros (COMPLETO ✅)
[████████████████████████████████] 100% Fase 5: Hamiltoniano & Diagonalização (COMPLETA ✅, sem degeneracy_handler)
[████████████████████████████████] 100% Fase 6: Densidade & SCF Cycle (COMPLETO ✅)
[████████████████████████████████] 100% Fase 7: I/O & Interface (COMPLETA ✅, sem logger/run_simulation)
[░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░]   0% Fase 8: Otimização (OPCIONAL - Futuro)
```

### Checklist de Progresso

#### Infraestrutura ✅
- [x] Estrutura fpm
- [x] Tipos básicos (`lsda_types.f90`)
- [x] Constantes (`lsda_constants.f90`)
- [x] Sistema de erros (`lsda_errors.f90`) ✅
- [x] Sistema de testes (Fortuno configurado)
- [ ] CI/CD

#### Core Physics 🔄
- [x] **Fase 1 - Bethe Ansatz Core** (100% ✅):
  - [x] Equações de Lieb-Wu (`bethe_equations.f90`) ✅
  - [x] Solvers Newton-Raphson (`nonlinear_solvers.f90`) ✅
  - [x] Continuation methods (`continuation.f90`) ✅
  - [x] Asserções: `bethe_equations` 27 + `nonlinear_solvers` 19 + `continuation` 22 = 68 ✅

- [x] **Fase 2 - Geração de Tabelas XC** (100% ✅):
  - [x] I/O de tabelas (`table_io.f90`) ✅
  - [x] Geração de tabelas (`bethe_tables.f90`) ✅
  - [x] Utilitário de conversão (`convert_tables.f90`) ✅
  - [x] Asserções: `table_io` 95 + `bethe_tables` 79 = 174 ✅

- [x] **Fase 3 - Splines 2D** (100% ✅):
  - [x] Interpolação bicúbica (`spline2d.f90`) ✅
  - [x] Interface XC funcional (`xc_lsda.f90`) ✅
  - [x] Asserções: `spline2d` 17 + `xc_lsda` 116 = 133 ✅

- [x] **Fase 4 - Potenciais & Erros** (100% ✅):
  - [x] Sistema de erros centralizado (`lsda_errors.f90`) ✅
  - [x] 10 identificadores de potencial implementados (incl. quasiperiodic AAH) ✅
  - [x] Factory pattern para potenciais ✅
  - [x] Asserções: `potentials` 112 + `errors` 47 = 159 ✅

- [x] **Fase 5 - Hamiltoniano & Diagonalização** (100% ✅):
  - [x] Boundary conditions (`boundary_conditions.f90`) ✅
    - [x] Implementação: BC_OPEN, BC_PERIODIC, BC_TWISTED ✅
    - [x] Validação de parâmetros ✅
    - [x] Eigenvalues analíticos para free particles ✅
    - [x] Asserções: `test_boundary_conditions` 48 ✅
  - [x] Construção do Hamiltoniano (`hamiltonian_builder.f90`) ✅
    - [x] `validate_hamiltonian_inputs()`: validação com NaN/Inf ✅
    - [x] `build_hamiltonian()`: H real com BCs ✅
    - [x] `build_hamiltonian_complex()`: H complexo (twisted BC) ✅
    - [x] `build_hamiltonian_free()`: H livre (validação) ✅
    - [x] `compute_effective_potential()`: V_eff = V_ext + V_xc ✅
    - [x] Bug fix: loop de hopping corrigido ✅
    - [x] Asserções: `test_hamiltonian_builder` 44 ✅
  - [x] Wrapper LAPACK para diagonalização (`lapack_wrapper.f90`) ✅
    - [x] `validate_diagonalization_inputs()`: validação de dimensões ✅
    - [x] `diagonalize_open_tridiagonal()`: DSTEVR parcial para OBC ✅
    - [x] `diagonalize_symmetric_real_partial()`: DSYEVR parcial para matrizes reais simétricas ✅
    - [x] `diagonalize_hermitian_complex_partial()`: ZHEEVR parcial para matrizes complexas hermitianas ✅
    - [x] Workspace query em duas fases (lwork=-1 → allocate) ✅
    - [x] Interface LAPACK sem bind(C) (convenção Fortran nativa) ✅
    - [x] Asserções: `test_lapack_wrapper` 42 ✅
  - [ ] Tratamento de degenerescências (`degeneracy_handler.f90`) — **CÓDIGO MORTO**
    - O módulo e seus testes foram movidos para `extras/dead_code/` em T7: não estão em
      `fpm.toml`, não são compilados e nenhum arquivo de `src/` os usa
      (`grep -rn degeneracy_handler src/ app/` não retorna nada).
    - O que resolve o problema hoje é a ocupação C¹ de `density_calculator.f90`, que
      distribui peso fracionário sobre a camada quase-degenerada em vez de
      reortogonalizar o subespaço.

- [x] **Fase 6 - Densidade & SCF Cycle** (100% ✅):
  - [x] Cálculo de densidade (`density_calculator.f90`) ✅
    - [x] `compute_density_spin()`: n_σ(i) = Σⱼ |ψⱼ(i)|² (real/complex overload) ✅
    - [x] `compute_total_density()`: n(i) = n↑(i) + n↓(i) ✅
    - [x] `verify_particle_number()`: Σn(i) = N ✅
    - [x] `check_density_bounds()`: 0 ≤ n_σ(i) ≤ 1, 0 ≤ n(i) ≤ 2 ✅
    - [x] Asserções: `test_density_calculator` 118 ✅
  - [x] Monitoramento de convergência (`convergence_monitor.f90`) ✅
    - [x] `compute_density_difference()`: Δn = n_new - n_old ✅
    - [x] `compute_density_norm()`: Normas L1, L2, L∞ ✅
    - [x] `check_scf_convergence()`: ||Δn||₂ < tol (tolerância customizável) ✅
    - [x] `convergence_history_t`: Tipo para rastrear histórico (norms + energias) ✅
    - [x] Asserções: `test_convergence_monitor` 41 ✅
  - [x] Esquemas de mixing (`mixing_schemes.f90`) ✅
    - [x] `linear_mixing()`: n_mixed = (1-α)·n_old + α·n_new (0 < α ≤ 1) ✅
    - [x] Asserções: `test_mixing_schemes` 16 ✅
  - [x] **Mistura adaptativa (`adaptive_mixing.f90`) ✅** - CRÍTICO!
    - [x] Classe `Convergencia` do C++ (compatibilidade total) ✅
    - [x] `adaptive_mix_update()`: rastreamento de banda energética ✅
    - [x] `UpMix()`/`DwMix()`: ajuste automático de Mix ✅
    - [x] Convergência dupla: densidade E/OU energia ✅
    - [x] Safety checks: Mix > 0.35 para DwMix ✅
    - [x] Asserções: `test_adaptive_mixing` 58 ✅
  - [x] **Ciclo Kohn-Sham (`kohn_sham_cycle.f90`) ✅** - REFATORAÇÃO CRÍTICA!
    - [x] **MUDANÇA ARQUITETURAL:** Density mixing → **Potential mixing** ✅
    - [x] `compute_total_energy()`: E_tot = Σε + E_xc - ∫V_xc·n ✅
    - [x] `validate_kohn_sham_cycle_inputs()`: Validação completa ✅
    - [x] `run_kohn_sham_scf_real()`: SCF para H real (OBC/PBC) ✅
    - [x] `run_kohn_sham_scf_complex()`: SCF para H complexo (TBC) ✅
    - [x] Convergência em casos extremos: U=-4, V=-4, 50% impurities ✅
    - [x] Asserções: `test_kohn_sham_cycle` 238 ✅

- [x] **Fase 7 - I/O & Interface** (100% ✅):
  - [x] Parse de input (`input_parser.f90`) ✅
    - [x] Namelist-based: &system, &potential, &scf ✅
    - [x] `parse_input_file()`: leitura de arquivo de input ✅
    - [x] Validação de parâmetros físicos ✅
    - [x] Asserções: `test_input_parser` 130 ✅
  - [x] Escrita de output (`output_writer.f90`) ✅
    - [x] `write_results()`: densidades, eigenvalues, energia total ✅
    - [x] `write_convergence_history()`: histórico SCF ✅
    - [x] Formato legível para visualização/análise ✅
    - [x] Asserções: `test_output_writer` 133 ✅
  - [ ] Sistema de logging (`logger.f90`) — **não existe**; nunca foi escrito.
        Não há `log_message()` nem `set_log_level()` no repositório, e não há
        `test_logger.f90`. A verbosidade é controlada pela chave `verbose` do `&scf`.
  - [x] Executáveis principais (`app/`) ✅
    - [x] `main.f90`: ponto de entrada com --input flag; integra todo o pipeline ✅
    - [x] `convert_tables.f90` e `generate_table.f90` ✅
    - [ ] `run_simulation.f90`: **não existe**; o papel de runner ficou em `main.f90`.
    - [ ] `INPUT_FORMAT.md` / `OUTPUT_FORMAT.md`: **não existem**. Formato de entrada:
          tabela de namelist do `README.md`. API: `doc/` (FORD).

- [ ] **Fase 8 - Otimização** (OPCIONAL - Futuro):
  - [ ] Simetria de paridade (`symmetry.f90`)
    - [ ] `check_parity_symmetry()`: detectar V(i) = V(L+1-i)
    - [ ] `block_diagonalize_hamiltonian()`: split H → H_even, H_odd
    - [ ] Speedup 4x para potenciais simétricos
  - [ ] Paralelização OpenMP
  - [ ] Profiling e otimização
  - [ ] Broyden/Anderson mixing (bonus)

#### Features 🔄
- [x] Potenciais (10 identificadores: uniform, harmonic, três impurity, dois random, duas barrier e quasiperiodic) ✅
- [x] Boundary Conditions (Open, Periodic, Twisted) ✅
- [x] Diagonalização LAPACK (real simétrico & complexo Hermitiano) ✅
- [x] Quase-degenerescência tratada por ocupação C¹ em `density_calculator.f90` ✅
      (o antigo QR/Gram-Schmidt é código morto em `extras/dead_code/`)
- [ ] Simetria de paridade (não implementada)

#### Qualidade
Contagens por **asserções** (`call check(`), medidas em 2026-09-20 com
`for f in test/*.f90; do grep -c 'call check(' "$f"; done`. Não são "testes" no sentido
de casos Fortuno; o agregado de casos é o que `fpm test --profile release` imprime.

- [x] Bethe core (`bethe_equations` 27, `nonlinear_solvers` 19, `continuation` 22) — 68 ✅
- [x] Limite termodinâmico (`lieb_wu_integral`) — 53 ✅
- [x] Tabelas (`table_io` 95, `bethe_tables` 79) — 174 ✅
- [x] Splines/XC (`spline2d` 17, `xc_lsda` 116) — 133 ✅
- [x] Potenciais e erros (`potentials` 112, `errors` 47) — 159 ✅
- [x] Hamiltoniano e diagonalização (`boundary_conditions` 48, `hamiltonian_builder` 44,
      `lapack_wrapper` 42) — 134 ✅
- [x] Densidade e SCF (`kohn_sham_cycle` 238, `density_calculator` 118,
      `adaptive_mixing` 58, `convergence_monitor` 41, `mixing_schemes` 16) — 471 ✅
- [x] I/O (`input_parser` 130, `output_writer` 133) — 263 ✅
- [x] **Total: 20 suítes em `fpm.toml`, 1455 asserções** ✅
      `fpm test --profile release` em 2026-09-20: 351 casos Fortuno, 0 falhas.
- [x] Pipeline completo: Bethe → Tables → Splines → Potentials → Hamiltonian → Diagonalization → Density → Convergence → **SCF → I/O** ✅
- [x] Testes end-to-end: SCF converge em casos difíceis (U=-4, V=-4, 50% impurities) ✅
- [x] Validação física: conservação de partículas, bounds, simetrias ✅
- [ ] Documentação completa (FORD)
- [ ] Benchmarks de performance

---

## 🎓 Para Novos Desenvolvedores

### Quick Start

```bash
# Clonar repositório
git clone https://github.com/guycanella/lsdaks.git
cd lsdaks

# Build
fpm build

# Rodar testes (o perfil release é obrigatório: em debug o Fortuno aborta
# por um bug com gfortran 16)
fpm test --profile release

# Rodar um exemplo: os arquivos em examples/ são inputs namelist
fpm run lsdaks -- --input examples/input_harmonic_trap.txt
```

### Onde Começar?

1. **Leia:** `README.md` (uso básico) e este `PROJECT_CONTEXT.md` (contexto técnico)
2. **Entenda:** Leia `src/types/lsda_types.f90` e `lsda_constants.f90` para ver estruturas de dados
3. **Estude:** Revise módulos completos da Fase 1:
   - `src/bethe_ansatz/bethe_equations.f90` - Equações de Lieb-Wu
   - `src/bethe_ansatz/nonlinear_solvers.f90` - Newton-Raphson
   - `src/bethe_ansatz/continuation.f90` - Continuation methods
   - `src/bethe_ansatz/table_io.f90` - I/O de tabelas
4. **Contribua:** os itens abertos estão no `NEXT_STEPS_REPORT.md`; todos os módulos da Fase 1
   já existem, então não há "próximo arquivo" a escrever do zero.

### Recursos de Aprendizado

- **Fortran moderno:** https://fortran-lang.org/learn/
- **Bethe Ansatz:** Essler et al., "The One-Dimensional Hubbard Model"
- **DFT:** Capelle & Campo, "Density functionals and model Hamiltonians"
- **Newton-Raphson:** Numerical Recipes (Press et al.)

---

## 📄 Licença

Este projeto é licenciado sob a [MIT License](LICENSE).

---

## 👨‍💻 Informações de Desenvolvimento

**Mantido por:** Guilherme Canella
**Contato:** guycanella@gmail.com
**Repositório:** https://github.com/guycanella/lsdaks
**Última atualização:** 2026-09-20
**Status:** ver a seção "📊 Status do Projeto" acima.

---

## 📅 Histórico de Mudanças

### 2025-01-18 - 🎉 CÓDIGO PRODUCTION-READY! Todas as Fases Completas! 🎉

- ✅ **MILESTONE FINAL:** Fase 7 completa! O projeto agora é um código LSDA production-ready!
- ✅ **REFATORAÇÃO CRÍTICA DO SCF:** Mudança arquitetural de **density mixing** → **potential mixing**

#### **Por que essa mudança foi crítica?**

O código originalmente misturava **densidades** entre iterações SCF (abordagem comum em DFT):
```fortran
! ABORDAGEM ANTIGA (ERRADA ❌):
n_up_in = (1-α)*n_up_in + α*n_up_out    ! Mistura densidade
n_down_in = (1-α)*n_down_in + α*n_down_out

call get_vxc(..., V_xc_up, V_xc_down)    ! V_xc de densidade misturada
V_eff_up = V_ext + U*n_down_in + V_xc_up
call build_hamiltonian(V_eff_up, ...)   ! H de potencial calculado diretamente
```

**Problema:** Em sistemas com forte correlação (U atrativo, impurezas, desordem), isso levava a:
- Oscilações selvagens na densidade
- Não-convergência mesmo com α muito pequeno (α=0.01)
- Exemplo: U=-4, V0=-4, 50% impurities → **NÃO CONVERGIA**

#### **Solução: Seguir o código C++ original!**

Análise cuidadosa do `lsdaks.cc` revelou que o C++ **NUNCA** mistura densidades! Ele mistura **POTENCIAIS**:

```cpp
// lsdaks.cc, linhas 633-640 (C++ original)
v_eff[0][j] = Conv.Mix*v_eff[0][j] + (1.0 - Conv.Mix)*(v_ext[0][j] + u*dens[1][j] + Vxc[0][j]);

// Linhas 695-696: densidade é COPIADA, não misturada!
dens[0][i] = next_dens[0][i];  // ← SEM MISTURA!
```

**Implementação Fortran correta:**
```fortran
! ABORDAGEM NOVA (CORRETA ✅):
! 1. Calcular V_xc de densidades atuais
call get_vxc(..., V_xc_up, V_xc_down)

! 2. Calcular potenciais efetivos
V_eff_up_calc = V_ext + U*n_down_in + V_xc_up

! 3. MISTURAR POTENCIAIS (não densidades!)
V_eff_up = (1-α)*V_eff_up + α*V_eff_up_calc  ✅

! 4. H com potencial misturado
call build_hamiltonian(V_eff_up, H_up, ...)

! 5. Diagonalizar → novas densidades
call compute_density(eigvecs, n_up_out)

! 6. COPIAR densidades diretamente (SEM MISTURA!)
n_up_in = n_up_out  ✅
```

#### **Resultados:**

**Teste difícil:** U=-4, V0=-4, 50% impurezas aleatórias, L=100

**ANTES (density mixing):**
```
Iter 100  |Δn| = 3.3848      E_tot = -364.9371
Iter 200  |Δn| = 3.3651      E_tot = -364.8792
...oscila indefinidamente...
❌ NÃO CONVERGE
```

**DEPOIS (potential mixing):**
```
Iter 100  |Δn| = 1.4235E-03  E_tot = -364.84973183  α = 0.04844
Iter 198  |Δn| = 3.3878E-07  E_tot = -364.84972947  α = 0.05016
✓ CONVERGED!
```

#### **Módulos modificados na refatoração:**

1. **`src/convergence/adaptive_mixing.f90`** (NEW - 240 linhas):
   - Implementação completa da classe `Convergencia` do C++
   - `adaptive_mix_t`: rastreamento de banda energética [E_bot, E_top]
   - `UpMix()`/`DwMix()`: ajuste automático de Mix
   - Safety check: só chama DwMix se Mix > 0.35
   - Conversão: α_Fortran = 1 - Mix_Cpp

2. **`src/kohn_sham/kohn_sham_cycle.f90`** (REFATORADO - 845 linhas):
   - Adicionados arrays `V_eff_up`, `V_eff_down`, `V_eff_up_calc`, `V_eff_down_calc`
   - Inicialização: `V_eff = V_ext` (primeira iteração)
   - SCF loop modificado:
     - **Antes da Hamiltonian:** Mixing de potenciais
     - **Depois da diagonalização:** Cópia direta de densidades (SEM mixing!)
   - Dual convergence: densidade OU energia (mais robusto)
   - Flag `use_adaptive_mixing` em `scf_params_t`

3. **`src/io/input_parser.f90`** (ATUALIZADO):
   - Adicionado `use_adaptive_mixing` ao namelist `&scf`
   - Default: `.true.` (usa adaptive mixing por padrão)

#### **Teste de validação end-to-end:**

```bash
# input.txt com caso difícil
&system
  L = 100, Nup = 25, Ndown = 25, U = -4.0, bc = 'open'
/
&potential
  potential_type = 'impurity', V0 = -4.0, concentration = 50.0
/
&scf
  max_iter = 10000, use_adaptive_mixing = .true.
/

# Rodar simulação
fpm run lsdaks -- --input input.txt

# Resultado:
✓ CONVERGED em 198 iterações
  Final |Δn| = 3.39E-07
  Final E_tot = -364.84972947 eV
  Conservação: ∫n_up = 25.000000, ∫n_down = 25.000000 ✓
```

#### **Lições aprendidas:**

1. **SEMPRE verificar o código original** quando houver divergência comportamental
2. **Mixing de potencial** é mais estável que mixing de densidade para sistemas correlacionados
3. **Convergência dupla** (densidade OU energia) aumenta robustez
4. **Safety checks** em DwMix previnem Mix negativo
5. **Casos difíceis** (U<0, desordem) são **críticos** para validação

#### **Estatísticas finais:**

- **Tempo de refatoração:** ~2 dias (investigação + implementação + validação)
- **Linhas modificadas:** ~1085 linhas (novo `adaptive_mixing.f90` + refatoração `kohn_sham_cycle.f90`)
- **Testes adicionados:** 15 testes `adaptive_mixing`, validação end-to-end
- **Impacto:** 🎯 **Sistema difícil agora converge!** Código production-ready!

---

### 2025-01-16 - 🎉 FASE 6 COMPLETA! Solver LSDA Funcional! 🎉
- ✅ **MILESTONE CRÍTICO:** Fase 6 100% completa! O projeto agora tem um solver LSDA-DFT totalmente funcional!

  **`kohn_sham_cycle.f90` implementado** (778 linhas, 13 testes):
  - ✅ **Tipos principais**:
    - `scf_params_t`: Parâmetros do ciclo SCF (max_iter, tolerâncias, mixing_alpha, verbose, store_history)
    - `scf_results_t`: Resultados completos (converged, n_iterations, final_density_error, final_energy, density_up/down, eigvals, history)
  - ✅ `compute_total_energy()`: Cálculo de energia total com correção de double-counting
    - E_tot = Σ_σ Σ_j ε_j,σ + E_xc - ∫V_xc·n dr
    - Remove energia potencial XC já incluída nos eigenvalues
  - ✅ `validate_kohn_sham_cycle_inputs()`: Validação completa de parâmetros
    - Sistema: L > 0, Nup/Ndown >= 0, N <= L (Pauli exclusion)
    - SCF: max_iter > 0, 0 < mixing_alpha <= 1
    - Arrays: size(V_ext) = L
  - ✅ `run_kohn_sham_scf_real()`: Loop SCF completo para Hamiltoniano real (OBC, PBC)
    - Inicialização: densidade uniforme n_σ = N_σ/L
    - Iteração: V_xc → H_σ → diagonalize → n'_σ → mixing → convergence check
    - Monitoramento: histórico de densidade e energia por iteração
    - Output verbose opcional: `Iter N  |Δn| = X.XXe-XX  E_tot = X.XXXXXXXX`
  - ✅ `run_kohn_sham_scf_complex()`: Loop SCF para Hamiltoniano complexo (TBC)
    - Mesma estrutura que real, mas com H e eigvecs complexos
    - Densidade permanece real: n(i) = |ψ(i)|²
  - ✅ `init_scf_results()`, `cleanup_scf_results()`: Gerenciamento de memória
  - ✅ **Padronização**: Uso consistente de `eigvals` (não `eigvalues`) em todo o código
  - ✅ **Simplificação**: Removido `V_eff_up/down` intermediário (cálculo direto V_ext + V_xc)

  **Testes implementados** (557 linhas, 13 testes):
  - ✅ `test_compute_total_energy_simple`: E_tot com eigenvalues simples, validação física
  - ✅ `test_compute_total_energy_half_filling`: Half-filling (n=1) com U=4
  - ✅ `test_validate_inputs_valid`: Validação aceita parâmetros físicos
  - ✅ `test_validate_inputs_invalid_L`: Detecta L <= 0
  - ✅ `test_validate_inputs_invalid_N`: Detecta N > L (Pauli violation)
  - ✅ `test_validate_inputs_size_mismatch`: Detecta size(V_ext) != L
  - ✅ `test_validate_inputs_invalid_mixing`: Detecta mixing_alpha fora de (0,1]
  - ✅ `test_scf_results_init_cleanup`: Init/cleanup de memória
  - ✅ `test_scf_converges_u0_open`: SCF converge para U=1, BC_OPEN
  - ✅ `test_scf_converges_u0_periodic`: SCF converge para U=2, BC_PERIODIC (relaxado)
  - ✅ `test_scf_stores_history`: Histórico de convergência armazenado corretamente
  - ✅ `test_scf_density_conservation`: Conservação de número de partículas N = Σn(i)
  - ✅ `test_scf_complex_twisted_bc`: SCF complexo (TBC) com theta = π/4
    - Verifica densidade real e positiva mesmo com ψ complexo
    - Conservação de partículas mantida

  **Correções durante implementação:**
  - ✅ Interface genérica removida: `run_kohn_sham_scf_real/complex` têm mesma assinatura
    - Fortran não consegue diferenciar por tipos internos (H, eigvecs)
    - Solução: chamadas explícitas `_real` ou `_complex`
  - ✅ Nomes de campos corrigidos: `density_norms` e `current_iter` (não `density_errors`, `n_stored`)
  - ✅ Teste robusto: aceita não-convergência para casos difíceis (U=2, tolerance tight)
    - Critérios relaxados: max_iter=100, tol=1e-5, alpha=0.2
    - Check: `ierr == ERROR_SUCCESS .or. ierr == ERROR_CONVERGENCE_FAILED`

  **Estatísticas Fase 6 (COMPLETA):**
  - ✅ Total: 1032 linhas produção + 1374 linhas testes (41 testes)
  - ✅ Módulos: `density_calculator.f90`, `convergence_monitor.f90`, `mixing_schemes.f90`, `kohn_sham_cycle.f90`
  - ✅ **Pipeline COMPLETO:** Bethe → Tables → Splines → Potentials → Hamiltonian → Diagonalization → Density → Convergence → **SCF!**

  **Total do Projeto:** 198 testes, 100% passando! 🎉🎉🎉

  **🎯 MARCO HISTÓRICO:** O projeto agora é um solver LSDA-DFT funcional completo para o modelo de Hubbard 1D!
  - ✅ Bethe Ansatz: solução exata via Lieb-Wu
  - ✅ Tabelas XC: E_xc e V_xc via BA
  - ✅ Interpolação: splines bicúbicas 2D
  - ✅ Potenciais: 7 tipos implementados
  - ✅ Hamiltoniano: tight-binding com BCs
  - ✅ Diagonalização: LAPACK otimizado
  - ✅ SCF: ciclo self-consistent completo
  - ✅ Testes: 198 testes unitários, 100% passando

---

### 2025-01-16 - Fase 6: Convergência SCF & Mixing Implementados! 🎉
- ✅ **MILESTONE:** Fase 6 agora 60% completa! Falta apenas o loop SCF principal.

  **`convergence_monitor.f90` implementado** (218 linhas, 13 testes):
  - ✅ `compute_density_difference()`: Calcula Δn = n_new - n_old
  - ✅ `compute_density_norm()`: Três tipos de norma para monitoramento
    - L1: ||Δn||₁ = Σᵢ |Δn(i)| (mudança absoluta total)
    - L2: ||Δn||₂ = √(Σᵢ |Δn(i)|²) (norma Euclidiana - padrão DFT)
    - L∞: ||Δn||∞ = maxᵢ |Δn(i)| (maior mudança local)
  - ✅ `check_scf_convergence()`: Verifica ||Δn||₂ < tol (tolerância customizável)
  - ✅ `convergence_history_t`: Tipo para rastrear histórico SCF
    - Armazena normas de densidade + energias por iteração
    - Permite análise de comportamento SCF (oscilações, monotônico, saltos)
  - ✅ `init_convergence_history()`: Inicializa arrays para max_iter
  - ✅ `update_convergence_history()`: Armazena dados de cada iteração
  - ✅ `cleanup_convergence_history()`: Libera memória

  **Testes implementados** (288 linhas, 13 testes):
  - ✅ `test_density_difference_simple`: Calcula Δn site a site
  - ✅ `test_density_difference_zero`: Densidades idênticas (convergido)
  - ✅ `test_density_difference_size_mismatch`: Detecta arrays errados
  - ✅ `test_density_norm_L1`: Norma L1 = 0.7 para [0.1, -0.2, 0.3, -0.1]
  - ✅ `test_density_norm_L2`: Norma L2 = 0.5 para [0.3, 0.4, 0.0]
  - ✅ `test_density_norm_Linf`: Norma L∞ = 0.5 para [0.1, -0.5, 0.2, 0.3, -0.4]
  - ✅ `test_density_norm_invalid_type`: Rejeita tipo inválido
  - ✅ `test_convergence_check_converged`: ||Δn||₂ < 1e-6 → convergido
  - ✅ `test_convergence_check_not_converged`: ||Δn||₂ ≥ 1e-6 → não convergido
  - ✅ `test_convergence_check_custom_tolerance`: Tolerâncias tight vs loose
  - ✅ `test_history_init_cleanup`: Inicialização e limpeza de memória
  - ✅ `test_history_update`: Atualiza histórico com norma + energia
  - ✅ `test_history_bounds_checking`: Valida limites de iteração

  **`mixing_schemes.f90` implementado** (54 linhas, 9 testes):
  - ✅ `linear_mixing()`: n_mixed = (1-α)·n_old + α·n_new
    - Valida 0 < α ≤ 1
    - Preserva bounds físicos: 0 ≤ n ≤ 2
  - 💡 **Nota:** Broyden e Anderson mixing comentados para features bonus futuras

  **Testes implementados** (238 linhas, 9 testes):
  - ✅ `test_linear_mixing_alpha_half`: α=0.5 (média simples, damping moderado)
  - ✅ `test_linear_mixing_alpha_one`: α=1.0 (sem damping, atualização completa)
  - ✅ `test_linear_mixing_alpha_small`: α=0.1 (damping pesado, previne oscilações)
  - ✅ `test_linear_mixing_bounds`: Verifica 0 ≤ n_mixed ≤ 2 (combinação convexa)
  - ✅ `test_linear_mixing_convergence`: Simulação 10 iterações SCF
  - ✅ `test_linear_mixing_invalid_alpha_zero`: Rejeita α=0 (sem progresso)
  - ✅ `test_linear_mixing_invalid_alpha_negative`: Rejeita α<0 (não físico)
  - ✅ `test_linear_mixing_invalid_alpha_large`: Rejeita α>1 (over-relaxation)
  - ✅ `test_linear_mixing_size_mismatch`: Detecta arrays de tamanho errado

  **Estatísticas Fase 6 (atualizado):**
  - ✅ Total: 475 linhas produção + 817 linhas testes (28 testes)
  - ✅ **Pipeline:** Bethe → Tables → Splines → Potentials → Hamiltonian → Diagonalization → Density → **Convergence!**
  - 🔜 Próximo: `ks_cycle.f90` (loop SCF completo - MÓDULO FINAL!)

  **Total do Projeto:** 185 testes, 100% passando! 🎉

---

### 2025-01-16 - Fase 6: Cálculo de Densidade Implementado! 🎉
- ✅ **MILESTONE:** Fase 5 completa (100%)! Fase 6 iniciada (densidade de autoestados KS).

  **`density_calculator.f90` implementado** (203 linhas, 6 testes):
  - ✅ `compute_density_spin()`: Cálculo de n_σ(i) = Σⱼ |ψⱼ(i)|² para estados ocupados
    - Interface genérica: overload para eigenvectors reais (OBC/PBC) e complexos (TBC)
    - Para T=0 (ground state): ocupar primeiros N níveis
  - ✅ `compute_total_density()`: n(i) = n↑(i) + n↓(i)
  - ✅ `verify_particle_number()`: Verifica Σn(i) = N dentro de TOL=1e-10
  - ✅ `check_density_bounds()`: Valida bounds físicos
    - 0 ≤ n_σ(i) ≤ 1 para cada spin (máximo 1 férmion por site/spin)
    - 0 ≤ n(i) ≤ 2 para densidade total (Pauli exclusion)
  - ✅ **Bug fix**: Variável `i→j` em loop de `check_density_bounds` (linha 195)

  **Testes implementados** (291 linhas, 6 testes):
  - ✅ `test_single_electron_density`: 1 elétron em caixa 1D (OBC)
    - Verifica n(i) = |ψ₁(i)|², densidade máxima no centro
  - ✅ `test_half_filling_unpolarized`: N=L, PBC, U=0
    - Densidade uniforme n(i)=1, simetria de spin n_up=n_dw=0.5
  - ✅ `test_particle_number_conservation`: Σn(i) = N (3 elétrons, L=8)
  - ✅ `test_density_positivity`: n(i) ≥ 0 sempre (física básica)
  - ✅ `test_physical_bounds`: Verifica 0 ≤ n_σ(i) ≤ 1, 0 ≤ n(i) ≤ 2
  - ✅ `test_density_from_harmonic_trap`: Armadilha harmônica
    - Shell structure: densidade maior no centro, decai nas bordas
    - Perfil qualitativo correto (gaussiano-like)

  **Correções durante implementação:**
  - ✅ `lsda_errors.f90`: Adicionado `ERROR_UNPHYSICAL_DENSITY` aos exports públicos
  - ✅ Interface `apply_potential_harmonic`: Corrigida chamada (center calculado automaticamente)
  - ✅ Interface `diagonalize_symmetric_real`: Ordem de parâmetros corrigida (H, L, ...) não (L, H, ...)

  **Estatísticas Fase 6 (parcial):**
  - ✅ Total: 203 linhas produção + 291 linhas testes (6 testes)
  - ✅ **Pipeline completo:** Bethe → Tables → Splines → Potentials → Hamiltonian → Diagonalization → **Density!**
  - 🔜 Próximo: `scf_mixer.f90` (mixing schemes) + `ks_cycle.f90` (loop SCF)

  **Total do Projeto:** 164 testes, 100% passando! 🎉

---

### 2025-01-15 - Fase 5: Diagonalização LAPACK & Degenerescências! 🎉
- ✅ **MILESTONE:** Diagonalização de matrizes simétricas/Hermitianas completa!

  **`lapack_wrapper.f90` implementado** (347 linhas, 18 testes):
  - ✅ `validate_diagonalization_inputs()`: Validação de dimensões
    - L > 0, size(H) == (L,L), size(eigvals) == L, size(eigvecs) == (L,L)
  - ✅ `diagonalize_symmetric_real()`: Wrapper DSYEVD para matrizes reais simétricas
    - Calcula eigenvalues E eigenvectors
    - Eigenvalues retornados em ordem crescente (ground state = E₁)
    - Eigenvectors normalizados e ortogonais
  - ✅ `diagonalize_symmetric_real_values_only()`: Eigenvalues only (mais rápido ~2x)
  - ✅ `diagonalize_hermitian_complex()`: Wrapper ZHEEVD para Hermitianas complexas
    - Eigenvalues são SEMPRE reais (teorema fundamental QM)
    - Suporta twisted boundary conditions (Hamiltoniano complexo)
  - ✅ `diagonalize_hermitian_complex_values_only()`: Eigenvalues only
  - ✅ Workspace query em duas fases:
    - Fase 1: lwork=-1, query optimal workspace size
    - Fase 2: allocate(work(lwork)), chamar LAPACK novamente
  - ✅ **Bug fix crítico**: Removido `bind(C)` das interfaces LAPACK
    - LAPACK usa convenção Fortran nativa, não C!
    - `bind(C)` causava falha em workspace query no gfortran

  **`degeneracy_handler.f90` implementado** (405 linhas, 13 testes):
  - ✅ `find_degenerate_subspaces()`: Detecta grupos degenerados
    - Varre eigenvalues, identifica grupos onde |λᵢ - λⱼ| < DEG_TOL (1.0e-8)
    - Retorna array 2D: subspaces(n_subspaces, max_deg)
    - Exemplo: eigenvalues [1, 2, 2, 3, 3, 3] → 2 subspaces: [2,3] e [4,5,6]
  - ✅ `orthonormalize_degenerate_subspace()`: QR decomposition para vetores reais
    - Usa DGEQRF (QR factorization) + DORGQR (generate Q)
    - Mais estável numericamente que Gram-Schmidt
    - LAPACK handles workspace automaticamente via query
  - ✅ `orthonormalize_degenerate_subspace_complex()`: Gram-Schmidt modificado
    - Para vetores complexos (e.g., twisted BC)
    - Modified Gram-Schmidt: v_k ⊥ span{v₁,...,v_{k-1}} iterativamente
  - ✅ `compute_degeneracy_count()`: Conta quantos eigenvalues são degenerados com índice dado
  - ✅ `verify_orthonormality()`: Verifica ||V^T V - I||∞ < tol usando DGEMM
  - ✅ **Bug fix crítico 1**: Removido double conjugation
    - `DOT_PRODUCT(a,b)` em Fortran JÁ FAZ `SUM(CONJG(a)*b)` para vetores complexos!
    - Estava fazendo `DOT_PRODUCT(CONJG(a),b)` = `SUM(a*b)` → ERRADO
  - ✅ **Bug fix crítico 2**: Workspace query separada para DORGQR
    - DGEQRF e DORGQR podem precisar workspaces de tamanhos diferentes!
    - Antes: usava lwork do DGEQRF para DORGQR → falha em alguns sistemas
    - Agora: query separada para cada rotina LAPACK

  **Física dos Eigenproblemas:**
  - ✅ **Real simétrico**: H = H^T (open/periodic BC sem campo magnético)
  - ✅ **Complexo Hermitiano**: H = H† (twisted BC, Aharonov-Bohm phase)
  - ✅ **Degenerescências**: Ocorrem por simetrias (translação, paridade, spin)
    - Exemplo: PBC com L=10 → eigenvalues vêm em pares ±k (exceto k=0, L/2)
  - ✅ **Orthonormalização**: LAPACK pode retornar base arbitrária no subespaço degenerado
    - QR/Gram-Schmidt garante base ortonormal canônica

  **Testes implementados** (31 novos testes, 100% passando):
  - ✅ 18 testes `test_lapack_wrapper.f90`:
    - Validação de inputs (6 testes)
    - Diagonalização real (7 testes): identity, diagonal, 2×2 analítico, tridiagonal tight-binding, ordering, normalização, ortogonalidade
    - Eigenvalues only (1 teste)
    - Complexo Hermitiano (4 testes): identity, 2×2 analítico, eigenvalues reais, values only
  - ✅ 13 testes `test_degeneracy_handler.f90`:
    - Detecção de degenerescências (5 testes): nenhuma, par, tripla, múltiplos grupos, todos degenerados
    - Contagem (3 testes): single, par, tripla
    - Orthonormalization (3 testes): real pair/triple, complex pair
    - Verificação (2 testes): identity perfeita, detectar não-ortogonalidade

  **Estatísticas Fase 5:**
  - ✅ Total: 1228 linhas código produção + 1531 linhas testes
  - ✅ 66 testes (100% passando)
  - ✅ 4 módulos completos: boundary_conditions, hamiltonian_builder, lapack_wrapper, degeneracy_handler
  - ✅ Pipeline completo: Bethe Ansatz → Tables → Splines → Potentials → Hamiltonian → **Diagonalization!**
  - 🔜 Próximo: symmetry.f90 (explorar simetria de paridade para 4x speedup)

  **Total do Projeto:** 158 testes, 100% passando! 🎉

---

### 2025-01-14 - Fase 5: Hamiltoniano & Boundary Conditions! 🎉
- ✅ **MILESTONE:** Construção do Hamiltoniano tight-binding completa!

  **`boundary_conditions.f90` implementado** (256 linhas, 17 testes):
  - ✅ Enum com tipos de BC: `BC_OPEN`, `BC_PERIODIC`, `BC_TWISTED`
  - ✅ `validate_bc_parameters()`: Validação completa
    - BC type válido (1, 2, ou 3)
    - Sistema com L > 1 (mínimo 2 sites para tight-binding)
    - Para BC_TWISTED: theta obrigatório e em [0, 2π)
  - ✅ `apply_boundary_conditions()`: BCs para matrizes reais
    - BC_OPEN: sem modificação (H já é tridiagonal)
    - BC_PERIODIC: H(1,L) = H(L,1) = -1 (cria anel)
    - BC_TWISTED: retorna erro (use versão complexa)
  - ✅ `apply_boundary_conditions_complex()`: BCs para matrizes complexas
    - BC_OPEN: sem modificação
    - BC_PERIODIC: H(1,L) = H(L,1) = -1
    - BC_TWISTED: H(1,L) = -exp(iθ), H(L,1) = -exp(-iθ) (efeito Aharonov-Bohm)
  - ✅ `get_free_particle_eigenvalues()`: Eigenvalues analíticos para validação
    - OBC: E_n = -2cos(nπ/(L+1)), n=1,...,L (standing waves)
    - PBC: E_k = -2cos(2πk/L), k=0,...,L-1 (Bloch waves)
    - TBC: E_k(θ) = -2cos((2πk+θ)/L), k=0,...,L-1 (shifted spectrum)

  **Física das Boundary Conditions:**
  - ✅ **OBC**: Hard-wall boundaries, edge states, confinamento quântico
  - ✅ **PBC**: Conservação de momento, propriedades bulk, Bethe Ansatz
  - ✅ **TBC**: Persistent currents, efeito Aharonov-Bohm, flux threading
  - ✅ Antiperiodic BC (θ=π): meio quantum de fluxo, quebra degenerescências

  **`hamiltonian_builder.f90` implementado** (220 linhas, 18 testes):
  - ✅ `validate_hamiltonian_inputs()`: Validação robusta
    - L > 0 (sistema físico)
    - size(V_ext) == size(V_xc) == L
    - NaN/Inf checking usando `ieee_is_finite()` (importado de `ieee_arithmetic`)
  - ✅ `build_hamiltonian()`: Construção H real
    - Diagonal: H(i,i) = V_ext(i) + V_xc(i) (on-site energies)
    - Off-diagonal: H(i,i±1) = -t = -1 (hopping)
    - Aplica BCs via `apply_boundary_conditions()`
  - ✅ `build_hamiltonian_complex()`: Construção H complexo
    - Similar ao real mas com tipo `complex(dp)`
    - Suporta BC_TWISTED com theta
    - Diagonal sempre real (potenciais on-site)
  - ✅ `build_hamiltonian_free()`: H livre (U=0, V=0)
    - Apenas hopping, sem potenciais
    - Útil para validação contra eigenvalues analíticos
  - ✅ `compute_effective_potential()`: V_eff = V_ext + V_xc
    - Helper function simples
    - Validação de size matching

  **Bug crítico corrigido:**
  - ❌ **Problema:** Todas as 3 funções tinham loop incorreto:
    ```fortran
    do i = 1, L - 1
        if (i > 1) then  ! ❌ Pula i=1!
            H(i,i+1) = -1.0_dp
            H(i+1,i) = -1.0_dp
        end if
    end do
    ```
  - ✅ **Solução:** Removido `if (i > 1)` em todas as funções
  - ✅ **Impacto:** Sem o fix, H(1,2) e H(2,1) nunca eram setados → Hamiltoniano incorreto!
  - ✅ Detectado pelos testes `test_build_free_hamiltonian_open_bc` e `test_build_hamiltonian_offdiagonal`

  **Correção no sistema de erros:**
  - ✅ `ERROR_NOT_A_NUMBER` adicionado aos exports públicos de `lsda_errors.f90`
  - ✅ Mensagem de erro adicionada: "Array contains NaN or Inf values"

  **Testes implementados** (866 linhas, 35 testes):
  - ✅ **`test_boundary_conditions.f90`** (433 linhas, 17 testes):
    - Validação de BC: open, periodic, twisted (com/sem theta, ranges)
    - Aplicação de BC: open (no-op), periodic (edges), twisted (complex phases)
    - Antiperiodic (θ=π): H(1,L) = H(L,1) = +1
    - Free particle eigenvalues: OBC, PBC, TBC (validação analítica)
    - Size mismatch detection
  - ✅ **`test_hamiltonian_builder.f90`** (433 linhas, 18 testes):
    - Validação: inputs válidos, L inválido, size mismatches, NaN/Inf detection
    - Effective potential: computação e size mismatch
    - Free Hamiltonian: estrutura tridiagonal, OBC (sem edges), PBC (com edges)
    - Full Hamiltonian: diagonal (V_ext+V_xc), off-diagonal (hopping), BCs, simetria hermitiana
    - Complex Hamiltonian: diagonal real para potenciais on-site
    - Error handling completo

  **Física validada:**
  - ✅ Estrutura tridiagonal do tight-binding
  - ✅ Hermitianidade (H† = H → H simétrica para H real)
  - ✅ Dispersion relation E(k) = -2cos(k) para free particles
  - ✅ Boundary effects: OBC vs PBC vs TBC
  - ✅ Aharonov-Bohm phase em TBC

  **Estatísticas Fase 5 (parcial):**
  - **Código produção:** 476 linhas (2 módulos completos)
  - **Testes:** 866 linhas (35 testes, 100% passando)
  - **Total do projeto:** 110 testes (antes 92 + 18 novos)
  - **Próximo:** `symmetry.f90` para exploração de paridade

  **🎯 Próximo Passo:**
  - `src/hamiltonian/symmetry.f90`: Simetria de paridade
    - Para V(i) = V(L+1-i): H se block-diagonaliza em setores even/odd
    - Cada setor tem dimensão L/2 → speedup 4x na diagonalização
    - Funções: `check_parity_symmetry()`, `block_diagonalize_hamiltonian()`, `reconstruct_eigenstates()`

### 2025-01-13 (Parte 2) - Potencial Quasiperiódico Adicionado! 🎉
- ✅ **Correção e implementação do potencial quasiperiódico (AAH model)**

  **`potential_quasiperiodic.f90` reescrito** (100 linhas):
  - ✅ Corrigido padrão de erro: substituído tipo customizado `ErrorHandler` por `integer :: ierr`
  - ✅ Unificado em uma única subroutine: `apply_potential_quasiperiodic(lambda, beta, phi, L, V, ierr)`
  - ✅ Validação de parâmetros seguindo padrão do projeto
  - ✅ Uso de constantes corretas: `TWOPI` de `lsda_constants.f90`
  - ✅ Fórmula: V(i) = λ·cos(2πβi + φ) com i-1 para indexação física começar em 0

  **Física do Aubry-André-Harper (AAH):**
  - ✅ Extended phase (λ < 2): Estados deslocalizados
  - ✅ Critical phase (λ = 2): Funções de onda multifractais (transição metal-isolante)
  - ✅ Localized phase (λ > 2): Estados exponencialmente localizados
  - ✅ Golden ratio β = (√5-1)/2 para máxima incomensurabilidade
  - ✅ Modela localização de Anderson sem desordem

  **4 Testes quasiperiódicos adicionados** (83 linhas):
  - ✅ `test_quasiperiodic_golden_ratio`: Testa bounds [-λ, λ] e variação do potencial
  - ✅ `test_quasiperiodic_phase_shift`: Verifica que φ = π inverte o potencial
  - ✅ `test_quasiperiodic_critical_point`: Testa λ = 2 (ponto crítico)
  - ✅ `test_quasiperiodic_localization`: Testa λ = 5 (regime localizado)

  **`potential_factory.f90` atualizado** (186 linhas):
  - ✅ Adicionado suporte para "quasiperiodic" com 3 parâmetros: [lambda, beta, phi]
  - ✅ Documentação e info string completas
  - ✅ Factory agora suporta 7 tipos de potenciais

  **Estatísticas da atualização:**
  - **Código produção:** +100 linhas (potential_quasiperiodic) + 13 linhas (factory)
  - **Testes:** +83 linhas (4 novos testes)
  - **Total Fase 4 atualizado:** 1090 linhas produção + 869 linhas testes
  - **Total de testes:** 92 (antes 88 + 4 novos)

### 2025-01-13 (Parte 1) - Fase 4: COMPLETA! 🎉
- ✅ **MILESTONE:** Sistema de potenciais e erros totalmente funcional!

  **Módulo `lsda_errors.f90` implementado** (224 linhas, 13 testes):
  - ✅ Códigos de erro organizados: input (1-99), numerical (100-199), I/O (200-299), memory (300-399)
  - ✅ `get_error_message()` - Mensagens legíveis para cada código
  - ✅ `error_handler()` - Handler centralizado com opção fatal
  - ✅ `check_bounds()`, `check_positive()`, `check_range()` - Utilitários de validação
  - ✅ Integração com todos os módulos de potenciais

  **6 Módulos de potenciais base implementados** (753 linhas produção):
  - ✅ **`potential_uniform.f90`** (34 linhas): V(i) = V₀
  - ✅ **`potential_harmonic.f90`** (46 linhas): V(i) = 0.5·k·(i-center)² (optical traps)
  - ✅ **`potential_impurity.f90`** (191 linhas): single/multiple/random impurities
  - ✅ **`potential_random.f90`** (152 linhas): uniform/Gaussian disorder (Anderson localization)
  - ✅ **`potential_barrier.f90`** (157 linhas): single/double barriers (quantum tunneling)
  - ✅ **`potential_factory.f90`** (173 linhas): Factory pattern para criação dinâmica

  **Testes implementados** (786 linhas, 30 testes):
  - ✅ **`test_potentials.f90`** (502 linhas, 17 testes):
    - Uniform: constância em todos os sites
    - Harmonic: simetria de paridade, mínimo central
    - Impurity: posicionamento, bounds, overlap, concentração aleatória
    - Random: média zero, distribuições corretas (uniform/Gaussian)
    - Barrier: largura, bounds, separação do poço quântico, não-sobreposição
    - Factory: criação via string, comparação com chamadas diretas
  - ✅ **`test_lsda_errors.f90`** (284 linhas, 13 testes):
    - Códigos em intervalos corretos
    - Mensagens para todos os tipos
    - Utilitários de validação

  **Física Implementada:**
  - ✅ Armadilhas harmônicas (cold atoms, optical traps)
  - ✅ Localização de Anderson (random disorder, W/t regime)
  - ✅ Tunelamento quântico (barriers, T ~ exp(-2κw))
  - ✅ Ressonâncias Fabry-Pérot (double barriers, quasi-bound states)
  - ✅ Impurezas magnéticas diluídas

  **Correções Técnicas:**
  - ✅ Renomeados `potential_uniform()` → `apply_potential_uniform()` para evitar conflito de nomes
  - ✅ Renomeados `potential_harmonic()` → `apply_potential_harmonic()` para evitar conflito de nomes
  - ✅ Adicionado parâmetro `ierr` em uniform e harmonic para consistência

  **Estatísticas Fase 4 (inicial):**
  - **Código produção:** 977 linhas (7 módulos base)
  - **Testes:** 786 linhas (30 testes, 100% passando)
  - **Física:** 6 tipos de potenciais com explicações detalhadas nos testes

  **🎉 GRAND TOTAL (Fases 1+2+3+4 - após quasiperiodic):**
  - **15 módulos produção:** 3635 linhas
  - **2 executáveis:** 208 linhas (main.f90 + convert_tables.f90)
  - **9 suítes de testes:** 2665 linhas, 92 testes (100% passando)
  - **Total geral:** ~6508 linhas de código

### 2025-01-12 - Fase 3: COMPLETA! 🎉
- ✅ **MILESTONE:** Pipeline XC totalmente funcional de ponta a ponta!

  **Módulo `spline2d.f90` implementado** (351 linhas, 5 testes):
  - ✅ Tipo `spline2d_t` para grids irregulares 2D (n_y varia com x)
  - ✅ `spline1d_coeff()` - Algoritmo de Thomas para splines cúbicas 1D
  - ✅ `spline2d_init()` - Construção de splines separáveis
  - ✅ `spline2d_eval()` - Avaliação em (x, y) via interpolação separável
  - ✅ `find_interval()` - Busca binária para localização no grid
  - ✅ Tratamento de boundary conditions (natural e clamped)
  - ✅ Arrays 0-indexed internos para compatibilidade com algoritmo clássico

  **Módulo `xc_lsda.f90` implementado** (335 linhas, 6 testes):
  - ✅ Tipo `xc_lsda_t` com 3 splines: exc, vxc_up, vxc_dw
  - ✅ `xc_lsda_init()` - Carregamento de tabela e construção de splines
  - ✅ `get_exc(n_up, n_dw)` - Energia XC por partícula
  - ✅ `get_vxc(n_up, n_dw, v_xc_up, v_xc_dw)` - Potenciais XC
  - ✅ **4 regiões de simetria física:**
    - Region I (m≥0, n≤1): Identidade
    - Region II (m<0, n≤1): Spin exchange
    - Region III (m<0, n>1): Particle-hole
    - Region IV (m≥0, n>1): Combinada
  - ✅ `determine_region()`, `apply_symmetry_transform()`, `convert_to_nm()`
  - ✅ Casos especiais: U=0, n=0, bounds checking
  - ✅ **Padronização de nomenclatura:** n_dw (não n_dn) para spin-down

  **Testes implementados** (396 linhas, 11 testes):
  - ✅ `test_spline2d.f90` (5 testes): Init/destroy, interpolação exata, funções lineares/separáveis
  - ✅ `test_xc_lsda.f90` (6 testes): Init/destroy, simetrias de spin, regiões, transformações

  **Estatísticas Fase 3:**
  - **Código produção:** 686 linhas (spline2d + xc_lsda)
  - **Testes:** 396 linhas (11 testes, 100% passando)
  - **Pipeline completo:** Bethe Ansatz → Tabelas → Splines → XC funcional pronto para KS!

  **🎉 GRAND TOTAL (Fases 1+2+3):**
  - **7 módulos produção:** 2545 linhas
  - **2 executáveis:** 208 linhas (main.f90 + convert_tables.f90)
  - **7 suítes de testes:** 1796 linhas, 58 testes (100% passando)
  - **Total geral:** ~4549 linhas de código

### 2025-01-11 - Fase 2: COMPLETA! 🎉
- ✅ **MILESTONE:** Geração de tabelas XC totalmente funcional!

  **Módulo `bethe_tables.f90` implementado** (325 linhas, 6 testes):
  - ✅ Tipo `grid_params_t` para configurar grid de densidades
  - ✅ `compute_E0()` - Energia cinética não-interagente (Fermi gas livre)
  - ✅ `compute_E_xc()` - Energia XC via Bethe Ansatz: E_xc = E_BA - E_0
  - ✅ `compute_V_xc_numerical()` - Potenciais XC via derivadas de 5 pontos
  - ✅ `generate_xc_table()` - Geração completa de tabela para dado U
  - ✅ `generate_table_grid()` - Grid flexível com parâmetros customizados
  - ✅ Casos especiais: U=0, half-filling, polarizado

  **Testes `test_bethe_tables.f90`** (170 linhas, 6 testes):
  - ✅ E0 para half-filling e sistema polarizado
  - ✅ E_xc = 0 para U=0 (validação física)
  - ✅ Simetria V_xc (V_up = V_dn quando n_up = n_dn)
  - ✅ Parâmetros padrão do grid
  - ✅ Geração de tabela pequena

  **Estatísticas Fase 2:**
  - **Código produção:** 888 linhas (table_io + bethe_tables + convert_tables)
  - **Testes:** 444 linhas (16 testes, 100% passando)
  - **Pipeline completo:** Bethe Ansatz → E_xc → V_xc → Tabela → I/O binário

### 2025-01-09 - Fase 2: I/O de Tabelas Completo ✅
- ✅ Sistema de I/O de tabelas totalmente funcional!
  - **`table_io.f90`** (364 linhas, 10 testes): Leitura/escrita ASCII/binário
  - **`convert_tables.f90`** (199 linhas): Utilitário de conversão batch
  - **`test_table_io.f90`** (274 linhas): Validação roundtrip completa

### 2025-11-07 - Fase 1: COMPLETA ✅
- ✅ **MILESTONE:** Fase 1 totalmente concluída!
  - **3 módulos completos:** `bethe_equations.f90`, `nonlinear_solvers.f90`, `continuation.f90`
  - **1159 linhas de código produção** (487 + 303 + 369)
  - **946 linhas de testes** (446 + 302 + 198)
  - **31 testes unitários passando** (17 + 9 + 5)

- ✅ **`continuation.f90`** (369 linhas, 5 testes):
  - Implementado predictor-corrector method
  - Sweep forward, backward e bidirectional
  - Speedup típico de 5-10x vs soluções independentes
  - Validado com testes de consistência

- ✅ **Refinamentos finais:**
  - Derivadas dθ/dU e dΘ/dU implementadas
  - `compute_dFdU()` para continuation method
  - `compute_energy()` para cálculo de E = -2·Σcos(k)
  - Documentação FORD-compliant completa

### 2025-11-06 - Fase 1: Continuation + Newton ✅
- ✅ **`nonlinear_solvers.f90`** (303 linhas, 9 testes):
  - Newton-Raphson com line search
  - Wrapper LAPACK DGESV
  - Tratamento robusto: U=0, NaN, matrizes singulares
  - 100% dos testes passando

### 2025-11-05 - Fase 1: Bethe Equations ✅
- ✅ **`bethe_equations.f90`** (487 linhas, 17 testes):
  - Funções θ e Θ completas
  - Jacobiano analítico validado (< 1e-10)
  - Números quânticos inicializados
  - 100% dos testes passando

### 2025-11-03 - Fase 0: Infraestrutura ✅
- ✅ Criada estrutura completa do projeto com fpm
- ✅ Módulos base: `lsda_types`, `lsda_constants`
- ✅ Fortuno configurado e funcionando

---

## Validação Contra Código C++ de Referência

### 2024-11-22 - Correções Críticas para Correspondência Exata ✅

**Problema inicial:** Discrepâncias de energia entre implementações Fortran e C++ (erros de até 10x em alguns casos).

**Investigação e correções implementadas:**

#### 🐛 Bug #1: Precisão de Ponto Flutuante em Fronteiras de Região
- **Sintoma:** Para n=1.0 (half-filling), energia com erro de ~10x
- **Causa:** `n = n_up + n_down = 1.0000000000000001` devido a arredondamento
- **Fix:** Adicionada tolerância `TOL = 1.0e-12_dp` em `determine_region()`
- **Arquivo:** `src/xc_functional/xc_lsda.f90:299`
- **Resultado:** Energias agora concordam com < 1e-8 para half-filling

#### 🐛 Bug #2: Fórmula Incorreta em Random Uniform
- **Sintoma:** Potenciais aleatórios com distribuição errada
- **Causa:** Fortran usava `V = W*(rand - 0.5)` → range [-W/2, +W/2]
- **Esperado:** C++ usa `V = W*(2*rand - 1)` → range [-W, +W]
- **Fix:** Corrigida fórmula para `V = W*(2.0_dp*rand_val - 1.0_dp)`
- **Arquivo:** `src/potentials/potential_random.f90:81`
- **Resultado:** Distribuição uniforme correta [-W, +W]

#### 🐛 Bug #3: Double Barrier Sem Poço Quântico
- **Sintoma:** Energias completamente diferentes para barrier_double
- **Causa:** Fortran criava apenas 2 barreiras; C++ cria barreiras + poço atrativo entre elas
- **Geometria C++:** `[Barreira Vb] [Poço Vwell=-3.0] [Barreira Vb]`
- **Fix:** Reescrita completa da função com 3 regiões
- **Parâmetros novos:** `V_bar, L_bar, V_well, L_well` (antes: posições i1,i2)
- **Arquivos:**
  - `src/potentials/potential_barrier.f90:112-158` (implementação)
  - `src/io/input_parser.f90:40-42` (novos parâmetros)
  - `app/main.f90:147-153` (passagem de parâmetros)
- **Resultado:** Geometria idêntica ao C++, energias concordam

#### 🐛 Bug #4: Potencial Harmônico com Fator 0.5 Incorreto
- **Sintoma:** Energias de confinamento com magnitude errada
- **Causa:** Fortran: `V = 0.5*k*(i-center)²`, C++: `V = k*(i-center)²`
- **Fix:** Removido fator 0.5
- **Arquivo:** `src/potentials/potential_harmonic.f90:45`
- **Resultado:** Energia de confinamento correta

#### 🐛 Bug #5: Parâmetro Harmônico Não Passado
- **Sintoma:** V_ext era todo zero para potencial harmônico
- **Causa:** main.f90 passava `inputs%V0` em vez de `inputs%spring_constant`
- **Fix:** Adicionado campo `spring_constant` ao `input_params_t`
- **Arquivos:** `src/io/input_parser.f90:40`, `app/main.f90:137`
- **Resultado:** Potencial harmônico agora aplicado corretamente

### Melhorias no Output (2024-11-22) ✅

**Implementadas para saída profissional:**

1. **Timestamp e Timing:**
   - Data e hora de execução no banner
   - Tempo de CPU decorrido no final
   - Formato: YYYY-MM-DD e HH:MM:SS

2. **Formatação Numérica:**
   - Filling: `0.2000` (antes: `.2000`)
   - Mixing alpha: `0.050` (antes: `.050`)
   - Formato F6.4 e F5.3 força zero inicial

3. **Condições de Contorno:**
   - Nome completo: "Open Boundary Condition"
   - Removida linha redundante "BC: 1"

4. **Energia Clarificada:**
   - "Final Energy per site" (antes: "Final Energy")
   - Deixa explícito que é total_energy/L

5. **Arquivos:**
   - `app/main.f90`: Banner com timestamp, timing
   - `src/io/output_writer.f90`: Formatação e remoção BC numérica

### Seeds Variáveis para Potenciais Aleatórios

**Mudança:** Todos os inputs de `random_disorder` agora usam `pot_seed = -1`
- `pot_seed = -1`: Usa relógio do sistema (seed variável)
- `pot_seed ≥ 0`: Usa seed fixa (reprodutibilidade)
- **Comportamento:** Cada execução gera potencial aleatório diferente (como C++)
- **Arquivos:** 25 inputs em `test/comparison/random_disorder/*.txt`

### Status de Validação

Os itens acima registram correções históricas; não constituem validação completa de todos os potenciais e parâmetros contra o C++.

Reproduzido em 2026-09-20 com o executável C++ documentado (`build/cpp/lsdaks_cpp`) e o
mapeamento de potenciais deste repositório, OBC e U=4:

- uniforme, L=90, 45/45, tolerâncias 1e-10: diferença de E/L abaixo da resolução de `5e-10`;
- armadilha harmônica `k=0.02`, L=20, 2/2: abaixo da resolução de `5e-10`;
- barreira dupla `(3,3,-3,20)`, L=20, 2/2: abaixo da resolução de `5e-10`.

O C++ imprime a energia com `%12.9g` (`original/lsdaks.cc:44`), ou seja, 9 algarismos
significativos, o que dá incerteza de ±5e-10 no último dígito. As diferenças brutas
(`2.62e-10`, `3.94e-10` e `7.0e-11`, respectivamente) estão todas abaixo desse piso e não
devem ser lidas como concordâncias resolvidas nessas magnitudes.

O que falta para as duas últimas não é a medição, e sim **input versionado**: não há arquivo
de entrada nem script de comparação no repositório, de modo que reproduzi-las exige remontar
os inputs a partir dos parâmetros acima. É uma lacuna de empacotamento, não de validação.

---

**Este documento é vivo e deve ser atualizado conforme o projeto evolui!** 🚀
