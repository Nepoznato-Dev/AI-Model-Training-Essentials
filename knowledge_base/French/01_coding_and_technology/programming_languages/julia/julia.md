---
# Métadonnées
titre : "Julie"
description : "Référence complète sur le langage de programmation Julia couvrant la présentation, les compromis, les principes fondamentaux de la syntaxe, l'écosystème et quand l'utiliser."
catégorie : "Codage et technologie"
version : "1.0.0"
statut : "actif"
# Contribution
auteurs :
  - nom : « Équipe de formation des modèles IA »
    email: ""
    rôle : "original_author"
contributeurs : []
journal des modifications :
  - version : "1.0.0"
    date : "05/08/2026"
    auteur : « Équipe de formation des modèles IA »
    modifications : « Ajout des métadonnées de premier plan YAML pour le suivi des contributeurs »
# Révision
créé : "2026-08-05"
last_modified : "05/08/2026"
date_de_revue : "05/02/2027"
review_by : "Équipe de base de connaissances en matière de codage et de technologie"
next_review : "2027-08-05"
#Classement
tags : [julia, langage de programmation, syntaxe, écosystème, codage et technologie]
niveau de difficulté : "intermédiaire"
prérequis : []
estimate_reading_time : "36 min"
# Guide des contributions
apport :
  licence : "MIT"
  feedback_channel : "Problèmes GitHub"
  how_to_contribute : "Soumettez un PR avec les modifications et mettez à jour le journal des modifications"
  review_process : "Les modifications sont examinées par les responsables de la catégorie avant la fusion"
---
#Julie
Julia est un langage de programmation de haut niveau et performant conçu pour le calcul technique et scientifique. Publié pour la première fois en 2012 (1.0 en 2018), Julia a été créée pour résoudre le « problème des deux langues » : les scientifiques prototypent en Python/R mais réécrivent en C/C++/Fortran pour améliorer les performances de production. Julia vise à être aussi simple que Python mais aussi rapide que C.
Julia utilise la compilation juste à temps (JIT) via LLVM pour obtenir des performances proches du C tout en conservant une sensation interactive et dynamique. Il offre une prise en charge de premier ordre pour le calcul parallèle, le traitement distribué et un système de type sophistiqué à répartition multiple.
---

## Pourquoi Julia compte
- **Vitesse** : performances proches du C pour le code numérique — aucune étape de compilation requise par l'utilisateur.
- **Répartition multiple** : les fonctions se comportent différemment en fonction des types de TOUS les arguments – un paradigme puissant.
- **Informatique scientifique** : conçu dès le départ pour les mathématiques, l'algèbre linéaire et la science des données.
- **Parallélisme** : prise en charge intégrée du multitraitement, du multithread et de l'informatique distribuée.
- **Interopérabilité** : peut appeler directement Python, C et Fortran.
- **Écosystème en croissance** : écosystème de packages en expansion rapide pour les domaines du ML, de l'optimisation et de la science.
## Les compromis
| Limitation | Détails | Solution de contournement typique |
|-----------|---------|-------------------|
| **Écosystème plus jeune** | Moins de packages que Python | Croissance rapide ; l'interopérabilité avec Python comble les lacunes |
| **Latence de compilation** | Le premier appel à une fonction peut être lent (échauffement JIT) | Utiliser PackageCompiler pour les applications précompilées |
| **Petite communauté** | Beaucoup plus petit que Python ou R | Communauté active et accueillante |
| **Utilisation de la mémoire** | Supérieur à C/Fortran pour certaines charges de travail | Acceptable pour la plupart des travaux scientifiques |
| **Marché du travail** | Émergents — principalement recherche et finance quantitative | Croissance dans la science des données et le HPC |
---

## Fondamentaux de la syntaxe
```julia
# Variables (no type declarations needed)
name = "Alice"
age = 30
score = 9.5

# Functions
function greet(name::String, greeting::String="Hello")
    return "$greeting, $name!"
end

# Short-form function
add(x, y) = x + y

# Multiple dispatch — the same function name, different behaviour
area(shape::Circle) = π * shape.radius^2
area(shape::Rectangle) = shape.width * shape.height

# Arrays and linear algebra
A = [1 2 3; 4 5 6; 7 8 9]    # 3x3 matrix
b = [1, 2, 3]                  # Vector
x = A \ b                      # Solve Ax = b

# Broadcasting (apply function element-wise)
numbers = [1, 2, 3, 4, 5]
squared = numbers .^ 2
result = sin.(numbers) .+ cos.(numbers)

# List comprehensions
evens = [x for x in 1:100 if x % 2 == 0]

# Structs (user-defined types)
struct Point
    x::Float64
    y::Float64
end

function distance(p1::Point, p2::Point)
    return sqrt((p1.x - p2.x)^2 + (p1.y - p2.y)^2)
end

# Parallel computing
using Distributed
addprocs(4)  # Add 4 worker processes

@distributed (+) for i in 1:1000000
    rand()^2 + rand()^2
end
```

---

## Syntaxe et modèles avancés
### Analyse approfondie des répartitions multiples
L'envoi multiple est le joyau de Julia. Chaque fonction est générique : elle sélectionne une méthode en fonction des types d'exécution de **tous** les arguments, pas seulement du premier.
```julia
# Define an abstract type hierarchy
abstract type Shape end

struct Circle <: Shape
    radius::Float64
end

struct Rectangle <: Shape
    width::Float64
    height::Float64
end

struct Triangle <: Shape
    a::Float64
    b::Float64
    c::Float64
end

# Dispatch on a single type
area(s::Circle) = π * s.radius^2
area(s::Rectangle) = s.width * s.height
area(s::Triangle) = let s_p = (s.a + s.b + s.c) / 2
    sqrt(s_p * (s_p - s.a) * (s_p - s.b) * (s_p - s.c))
end

# Dispatch on MULTIPLE arguments
collides(c1::Circle, c2::Circle) =
    distance(c1, c2) < c1.radius + c2.radius

collides(r1::Rectangle, r2::Rectangle) =
    r1.width > 0 && r2.width > 0  # simplified

# Fallback method
collides(::Shape, ::Shape) = error("Collision not defined for these shapes")

# Inspect dispatch
methods(area)           # List all methods for area
@which area(Circle(1))  # Show which method is called
```

### Types paramétriques et types abstraits
```julia
# Parametric types
struct Point2D{T <: Real}
    x::T
    y::T
end

# Constructor with conversion
Point2D(x::Real, y::Real) = Point2D(promote(x, y)...)

p1 = Point2D(1.0, 2.0)      # Point2D{Float64}
p2 = Point2D(1, 2)           # Point2D{Int64}

# Abstract type parameters
norm(p::Point2D{<:AbstractFloat}) = sqrt(p.x^2 + p.y^2)
norm(p::Point2D{<:Integer}) = sqrt(Float64(p.x^2 + p.y^2))

# Union types
const NumberOrString = Union{Number, String}
process(x::NumberOrString) = println(x)

# Tuple types and dispatch
process_pair(x::Tuple{Int, Int}) = x[1] + x[2]
process_pair(x::Tuple{String, String}) = x[1] * " " * x[2]
```

### Surcharge des opérateurs
```julia
import Base: +, -, *, ==, isapprox, show

struct Vector2D
    x::Float64
    y::Float64
end

# Arithmetic operators
+(a::Vector2D, b::Vector2D) = Vector2D(a.x + b.x, a.y + b.y)
-(a::Vector2D, b::Vector2D) = Vector2D(a.x - b.x, a.y - b.y)
*(s::Number, v::Vector2D) = Vector2D(s * v.x, s * v.y)
*(v::Vector2D, s::Number) = *(s, v)

# Dot product via *
*(a::Vector2D, b::Vector2D) = a.x * b.x + a.y * b.y

# Approximate equality
isapprox(a::Vector2D, b::Vector2D; kwargs...) =
    isapprox(a.x, b.x; kwargs...) && isapprox(a.y, b.y; kwargs...)

# Custom display
function show(io::IO, v::Vector2D)
    print(io, "Vector2D($(v.x), $(v.y))")
end

v1 = Vector2D(1.0, 2.0)
v2 = Vector2D(3.0, 4.0)
v1 + v2          # Vector2D(4.0, 6.0)
v1 * v2          # 11.0 (dot product)
3.0 * v1         # Vector2D(3.0, 6.0)
```

### Métaprogrammation — Macros
Les macros Julia fonctionnent sur l'AST (arbre de syntaxe abstraite) au moment de l'analyse, permettant une génération de code puissante.
```julia
# Simple timing macro
macro timed(ex)
    quote
        local t0 = time_ns()
        local val = $(esc(ex))
        local t1 = time_ns()
        println("Elapsed: ", (t1 - t0) / 1e6, " ms")
        val
    end
end

@timed sum(rand(10_000_000))

# Benchmarking macro
macro bench(name, ex)
    quote
        local t = @elapsed for _ in 1:1000
            $(esc(ex))
        end
        println($name, ": ", t * 1000, " ms for 1000 iterations")
    end
end

@bench "sum" sum(rand(1000))

# Expression introspection
ex = :(x + y * z)
dump(ex)          # Show the AST
ex.head           # :call
ex.args           # [:+, :x, :(*, :y, :z)]
```

### Système de packages et de modules
```julia
# Project structure
# MyPackage/
# +-- Project.toml
# +-- src/
# |   +-- MyPackage.jl
# |   +-- types.jl
# |   +-- operations.jl
# +-- test/
# |   +-- runtests.jl
# +-- docs/
#     +-- make.jl

# Project.toml
# name = "MyPackage"
# uuid = "xxxxxxxx-xxxx-xxxx-xxxx-xxxxxxxxxxxx"
# authors = ["Author Name <email@example.com>"]
# version = "0.1.0"
#
# [deps]
# LinearAlgebra = "37e2e46d-f89d-539d-b4ee-838fcccc9c8e"
# Statistics = "10745b16-79ce-11e8-11f9-7d13ad32a3b2"
#
# [compat]
# julia = "1.9"

# Module definition (src/MyPackage.jl)
module MyPackage

export greet, MyType, compute

include("types.jl")
include("operations.jl")
include("utils.jl")

end
```

---

## Concurrence et parallélisme
### Multi-threading (Base.Threads)
```julia
using Base.Threads

# Check thread count
println("Threads: ", Threads.nthreads())
# Launch with: julia --threads=4

# Thread-safe accumulation with atomics
counter = Threads.Atomic{Int}(0)

Threads.@threads for i in 1:1_000_000
    Threads.atomic_add!(counter, 1)
end
println("Count: ", counter[])

# Parallel map
results = Vector{Float64}(undef, 1000)
Threads.@threads for i in 1:1000
    results[i] = sqrt(rand())
end

# Thread-local storage pattern
function parallel_sum(arr::Vector{Float64})
    nthreads = Threads.nthreads()
    chunk_sums = zeros(Float64, nthreads)
    chunk_size = cld(length(arr), nthreads)

    Threads.@threads for t in 1:nthreads
        start_idx = (t - 1) * chunk_size + 1
        end_idx = min(t * chunk_size, length(arr))
        for i in start_idx:end_idx
            chunk_sums[t] += arr[i]
        end
    end
    return sum(chunk_sums)
end
```

### Tâches et canaux (multitâche coopératif)
```julia
# Tasks (green threads / coroutines)
function producer(ch::Channel)
    for i in 1:10
        put!(ch, i^2)
    end
    close(ch)
end

ch = Channel(producer, ctype=Int, csize=32)
for val in ch
    println("Received: ", val)
end

# Async with @async and @sync
@sync begin
    @async begin
        sleep(1)
        println("Task A done")
    end
    @async begin
        sleep(0.5)
        println("Task B done")
    end
end
# Both tasks run concurrently; @sync waits for all
```

### Informatique distribuée
```julia
using Distributed

# Add worker processes
addprocs(4)

# Ensure all workers have the code
@everywhere using Statistics
@everywhere function heavy_computation(n::Int)
    return mean(rand(n) for _ in 1:n)
end

# Distributed map-reduce
result = @distributed (+) for i in 1:100
    heavy_computation(10_000)
end

# pmap — parallel map
results = pmap(i -> heavy_computation(10_000), 1:100)

# Remote references and futures
ref = @spawnat 2 heavy_computation(100_000)
val = fetch(ref)    # Blocks until result is ready

# Shared arrays (shared memory across processes on same machine)
using SharedArrays
S = SharedArray{Float64}(1000)
@distributed for i in 1:1000
    S[i] = sin(i)
end
```

---

## Configuration du projet et système de construction
### Structure complète du projet
```
MyScientificPackage/
+-- Project.toml              # Package metadata and dependencies
+-- Manifest.toml             # Exact dependency versions (auto-generated)
+-- src/
|   +-- MyScientificPackage.jl
|   +-- types.jl
|   +-- solvers.jl
|   +-- utils.jl
+-- test/
|   +-- runtests.jl
|   +-- test_types.jl
|   +-- test_solvers.jl
+-- docs/
|   +-- make.jl
|   +-- src/
|       +-- index.md
+-- benchmarks/
|   +-- bench_solvers.jl
+-- examples/
|   +-- demo.jl
+-- .github/
    +-- workflows/
        +-- CI.yml
```

### Gestion des dépendances
```julia
using Pkg

# Activate the project environment
Pkg.activate(".")

# Add dependencies
Pkg.add("LinearAlgebra")
Pkg.add("DifferentialEquations")
Pkg.add("Plots")

# Add specific versions
Pkg.add(name="JSON", version="0.21")

# Add a package from GitHub
Pkg.add(url="https://github.com/user/Package.jl")

# Develop a local package
Pkg.develop(path="/path/to/LocalPackage.jl")

# Instantiate from Manifest (reproducible environment)
Pkg.instantiate()

# Update dependencies
Pkg.update()

# Precompile for faster startup
using PackageCompiler
create_sysimage(["MyPackage"]; sysimage_path="custom_sysimage.so")
```

### Pipeline CI/CD (actions GitHub)
```yaml
# .github/workflows/CI.yml
name: CI
on:
  push:
    branches: [main]
  pull_request:
    branches: [main]

jobs:
  test:
    runs-on: ${{ matrix.os }}
    strategy:
      matrix:
        julia-version: ['1.9', '1.10', 'nightly']
        os: [ubuntu-latest, windows-latest, macos-latest]
    steps:
      - uses: actions/checkout@v4
      - uses: julia-actions/setup-julia@v1
        with:
          version: ${{ matrix.julia-version }}
      - uses: julia-actions/julia-buildpkg@v1
      - uses: julia-actions/julia-runtest@v1
      - uses: julia-actions/julia-processcoverage@v1
      - uses: codecov/codecov-action@v3
        with:
          file: lcov.info
```

---

## Tests
### Cadre de test (Test.jl)
```julia
using Test

# Basic test set
@testset "Point Operations" begin
    p1 = Point2D(3.0, 4.0)
    p2 = Point2D(1.0, 1.0)

    @test norm(p1) ≈ 5.0           # Approximate float comparison
    @test p1.x == 3.0
    @test typeof(p1) === Point2D{Float64}
    @test_throws MethodError p1 + 5  # Should error
end

# Nested test sets
@testset "Linear Algebra" begin
    @testset "Matrix operations" begin
        A = [1.0 2.0; 3.0 4.0]
        @test det(A) ≈ -2.0
        @test size(A) == (2, 2)
        @test rank(A) == 2
    end

    @testset "Solving systems" begin
        A = [1.0 0.0; 0.0 1.0]
        b = [3.0, 4.0]
        x = A \ b
        @test x ≈ b
    end
end

# Property-based testing
@testset "Commutativity" begin
    for _ in 1:100
        a, b = rand(), rand()
        @test a + b ≈ b + a
        @test a * b ≈ b * a
    end
end

# Run tests from command line:
# julia --project=. -e 'using Pkg; Pkg.test()'
```

### Analyse comparative avec BenchmarkTools
```julia
using BenchmarkTools

# Single benchmark
@btime sum(rand(1000))

# Detailed benchmark
b = @benchmark sum(rand(1000))
println(b)
# Shows: min, median, mean, max, memory estimate, allocations

# Compare two implementations
function sum_loop(n)
    s = 0.0
    for i in 1:n
        s += rand()
    end
    return s
end

function sum_vectorized(n)
    return sum(rand(n))
end

@btime sum_loop(1000)
@btime sum_vectorized(1000)
# Vectorized version is typically much faster
```

---

## Interopérabilité
### Appeler C et Fortran
```julia
# Call a C library function directly
# ccall((:function_name, "library"), return_type, (arg_types...), args...)

# Call libc time function
ccall((:time, "libc"), Int32, (Ptr{Cvoid},), C_NULL)

# Call a custom C library
result = ccall((:compute, "libmylib"), Float64, (Float64, Int32), 3.14, 42)

# Create C-callable function pointers
function my_julia_function(x::Float64, y::Float64)::Float64
    return x^2 + y^2
end
c_func = @cfunction(my_julia_function, Float64, (Float64, Float64))

# Call Fortran via shared library
ccall((:solve_system_, "libfortranlib"), Cvoid,
    (Ref{Float64}, Ref{Float64}, Ref{Int32}), A, b, n)
```

### Appeler Python
```julia
using PyCall

# Import Python modules
np = pyimport("numpy")
plt = pyimport("matplotlib.pyplot")

# Use Python objects naturally
arr = np.array([1, 2, 3, 4, 5])
result = np.mean(arr)

# Call Python functions with keyword arguments
plt.plot(arr, arr .^ 2)
plt.xlabel("x")
plt.ylabel("x^2")
plt.show()

# Convert between Julia and Python types
jl_array = [1.0, 2.0, 3.0]
py_array = py"list"jl_array
back_to_jl = Array{Float64}(py_array)

# Use scikit-learn from Julia
sklearn = pyimport("sklearn.linear_model")
model = sklearn.LinearRegression()
X = np.array([[1], [2], [3], [4]])
y = np.array([2, 4, 5, 4])
model.fit(X, y)
predictions = model.predict(np.array([[5], [6]]))
```

---

## Modèles de conception
### Modèle 1 : Fonctions de type stable
```julia
# BAD — type unstable (return type depends on runtime value)
function bad_abs(x)
    if x >= 0
        return x        # Returns Int or Float64 depending on input
    else
        return -x
    end
end

# GOOD — type stable
function good_abs(x::T) where {T <: Number}
    return x >= zero(T) ? x : -x
end

# Use @code_warntype to check type stability
@code_warntype good_abs(3.0)
# Variables should be blue (concrete types), not red (Union types)
```

### Modèle 2 : obstacles fonctionnels à la performance
```julia
# GOOD — function barrier isolates type instability
function transform(x::Int) = x * 2
function transform(x::Float64) = x^2
function transform(x::String) = length(x)

function process_mixed_good(items::Vector)
    results = Vector{Any}(undef, length(items))
    for i in eachindex(items)
        results[i] = transform(items[i])  # JIT compiles per-type
    end
    return results
end
```

### Modèle 3 : fonctions générées pour la spécialisation au moment de la compilation
```julia
@generated function efficient_dispatch(x::T) where {T}
    # This code runs at compile time, not runtime
    if T <: Integer
        return :(x * 2)
    elseif T <: AbstractFloat
        return :(x * 3.14159)
    else
        return :(error("Unsupported type: ", T))
    end
end

efficient_dispatch(5)       # 10
efficient_dispatch(5.0)     # 15.70795
```

### Modèle 4 : Pipelines de données immuables
```julia
# Chain transformations immutably using broadcasting and composition
pipe(x) = x |> (x -> x .^ 2) |> (x -> x .+ 1) |> (x -> sqrt.(x))
result = pipe([1.0, 2.0, 3.0, 4.0])

# Functional approach with map and reduce
function reduce_pipeline(data)
    data |>
        x -> filter(>(0), x) |>
        x -> map(sqrt, x) |>
        x -> reduce(+, x) / length(x)
end
```

---

## Performances et optimisation
### Outils de profilage
```julia
using Profile
using ProfileView  # Visual flame graph

# Profile a function
@profile for _ in 1:1000
    sum(rand(10000))
end

# View results in REPL
Profile.print()

# Visual flame graph (opens browser)
ProfileView.view()

# Memory allocation tracking
using AllocCheck
```

### Compilation et précompilation JIT
```julia
# Reduce time-to-first-execution (TTFX) with PrecompileTools
using PrecompileTools

@setup_workload begin
    @compile_workload begin
        my_function(1.0, 2.0)
        my_function([1.0, 2.0], [3.0, 4.0])
    end
end

# System image generation for fast startup
using PackageCompiler
create_sysimage(["MyPackage", "Plots", "DifferentialEquations"];
    sysimage_path="fast_startup.so",
    precompile_execution_file="warmup.jl"
)
# Launch with: julia --sysimage fast_startup.so
```

### Vectorisation et diffusion
```julia
# BAD — loop-based
function dot_loop(x, y)
    s = 0.0
    for i in eachindex(x, y)
        s += x[i] * y[i]
    end
    return s
end

# GOOD — broadcasting (fused, no intermediate allocations)
dot_broadcast(x, y) = sum(x .* y)

# BEST — use LinearAlgebra
using LinearAlgebra
dot_blas(x, y) = dot(x, y)

# Fuse operations with the @. macro
# BAD: creates 3 intermediate arrays
result = sin.(x) .+ cos.(x) .^ 2

# GOOD: fused into single loop (zero allocations)
result = @. sin(x) + cos(x)^2

# In-place operations to avoid allocation
function normalize!(x::Vector{Float64})
    n = norm(x)
    x ./= n    # Modifies in-place
    return x
end
```

### Comparaison de référence
```julia
using BenchmarkTools
using LinearAlgebra

x = rand(1_000_000)
y = rand(1_000_000)

@btime dot_loop($x, $y)        # ~1.2 ms (with @inbounds)
@btime dot_broadcast($x, $y)   # ~0.8 ms
@btime dot($x, $y)             # ~0.3 ms (BLAS)

# Memory allocation check
@btime sum($x .* $y)           # Shows allocations
@btime dot($x, $y)             # Zero allocations
```

---

## Déploiement
### Publication de packages
```julia
# Create your package with PkgTemplates
using PkgTemplates
tmpl = Template(
    user = "your-github-username",
    dir = "~/Documents",
    julia = v"1.9",
    plugins = [
        Git(),
        GitHubActions(),
        Codecov(),
        Documenter{GitHubActions}(),
    ]
)
tmpl("MyNewPackage")

# Register via JuliaRegistrator (GitHub bot)
# Comment @JuliaRegistrator register on your release commit
```

### Applications autonomes
```julia
using PackageCompiler

# Create a standalone executable
create_app(
    "path/to/MyPackage",       # Source directory
    "path/to/output_app";      # Output directory
    executables = ["myapp" => "main_function"],
    precompile_execution_file = "warmup.jl",
    filter_stdlibs = true,
    include_lazy_artifacts = false
)
# Output: output_app/bin/myapp (self-contained executable)
```

### Déploiement de conteneurs et HPC
```dockerfile
# Dockerfile for Julia application
FROM julia:1.10 AS builder
WORKDIR /app
COPY Project.toml Manifest.toml ./
RUN julia --project=. -e 'using Pkg; Pkg.instantiate()'
COPY src/ src/
RUN julia --project=. -e 'using Pkg; Pkg.precompile()'

FROM julia:1.10-slim
COPY --from=builder /app /app
ENTRYPOINT ["julia", "--project=/app", "/app/src/main.jl"]
```

```bash
# HPC job script (SLURM)
#!/bin/bash
#SBATCH --job-name=julia_sim
#SBATCH --nodes=4
#SBATCH --ntasks-per-node=16
#SBATCH --time=24:00:00

module load julia/1.10

julia --project=. -e '
    using Distributed, ClusterManagers
    addprocs(SlurmManager(64))
    @everywhere using MyPackage
    result = pmap(run_simulation, 1:10000)
    writedlm("results.txt", result)
'
```

---

## Quand utiliser Julia
| Scénario | Pourquoi Julia | Meilleure alternative |
|----------|----------|-------------------|
| Calcul scientifique | Performance + facilité d'utilisation | Python (NumPy), MATLAB, Fortran |
| Optimisation numérique | Excellents packages d'optimisation | C++, Fortran |
| Recherche sur l'apprentissage automatique | Écosystème en croissance (Flux.jl) | Python (PyTorch, TensorFlow) |
| Calcul parallèle | Support distribué intégré | Python (Dask), C++ (MPI) |
| Analyse des données | Possible; DataFrames.jl est bon | Python (Pandas), R |
| Développement Web | Ne convient pas | Javascript, Python |
| Développement d'applications générales | Ce n'est pas le cas d'utilisation principal | Python, Go, Java |
---

## Résumé
Julia est un langage moderne qui vise à être le meilleur outil de calcul scientifique et numérique. Sa combinaison de facilité de type Python et de performances de type C est convaincante. La répartition multiple est un paradigme puissant qui rend le code à la fois expressif et efficace. Alors que son écosystème continue de croître, Julia est de plus en plus utilisée dans la recherche, la finance quantitative et le calcul haute performance. Pour les travaux numériques où Python est trop lent et C++ trop lourd, Julia est un excellent choix.