#import "/lib/presentation.typ": cours-et-presentation, pause, only, cours-seulement, presentation-seulement
#import "/lib/theoremes.typ": definition, theorem, lemma, property, exercise, problem, corollary
#import "/lib/document.typ": sep, widetilde
#import "/lib/blocs.typ": attention, remarque, exemple

#show: cours-et-presentation.with(titre: "Langages réguliers", niveau: "MPI")

#presentation-seulement[
  = Motivation des langages formels

  == Recherche de motifs et syntaxe

  - Recherche d'un motif dans un texte.

  #align(center, image("langages-reguliers/code-mail.png", width: 36%))
  #align(center, text(size: 0.7em)[Recherche d'une adresse électronique dans Visual Studio Code])

  #pause
  - Formalisation de la syntaxe d'un langage de programmation et conception d'un nouveau langage : grammaires d'#link("https://ocaml.org/manual/lex.html")[OCaml] et de #link("https://docs.python.org/3/reference/grammar.html")[Python].
]

= Alphabet et mot

#presentation-seulement[
  == Alphabet, mot
]

#definition[
  - Un alphabet est un ensemble $Σ$ fini de lettres.
  - Un mot $m$ sur un alphabet $Σ$ est une suite finie $m_1, …, m_n$ de lettres de $Σ$, et on note $m = m_1 … m_n$.
  L'entier $n$ est la taille de $m$, notée $abs(m)$.
  - Le mot vide, ne contenant aucune lettre, est noté $ε$.
  - Deux mots $u = u_1 … u_n$ et $v = v_1 … v_p$ sur $Σ$ sont égaux si $n = p$ et : $forall i ∈ [|1, n|]$, $u_i = v_i$.

  - $Σ^*$ est l'ensemble des mots sur $Σ$ et $Σ^+ = Σ^* ∖ {ε}$.
]

#underline[Attention] : $ε$ est un mot, pas une lettre.

#presentation-seulement[
  == Concaténation et puissance
]

#definition[
  La concaténation de deux mots $u = u_1 … u_n$ et $v = v_1 … v_p$ est $u v = u_1 … u_n v_1 … v_p$.

  Si $u$ est un mot, on définit $u^0 = ε$ et $u^k = underbrace(u … u, k)$.
]

#presentation-seulement[
  == Une équation sur les mots
]

#exercise[
  Soient $Σ$ un alphabet, $a, b ∈ Σ$ et $u ∈ Σ^*$ tels que $a u = u b$.
  Montrer que $a = b$ et : $exists k ∈ ℕ, u = a^k$.
]

#presentation-seulement[
  == Concaténation et taille (hors programme)

  Un monoïde est un ensemble muni d'une opération associative et d'un élément neutre.

  #lemma[
    $(Σ^*, ⋅)$ est un monoïde, où $⋅$ est la concaténation de mots :
    - $ε ⋅ m = m ⋅ ε = m$ : $ε$ est un élément neutre.
    - $(m ⋅ n) ⋅ p = m ⋅ (n ⋅ p)$ : associativité.
  ]

  == La taille comme morphisme (hors programme)

  #lemma[
    La taille est un morphisme de monoïdes de $(Σ^*, ⋅)$ vers $(ℕ, +)$ :
    - $abs(ε) = 0$.
    - $abs(m ⋅ n) = abs(m) + abs(n)$.
  ]
]

#presentation-seulement[
  == Préfixe, suffixe, facteur, sous-mot
]

#definition[
  Soient $u$ et $m$ deux mots sur $Σ$.
  - $u$ est un préfixe de $m$ s'il existe un mot $v$ tel que $m = u v$.
  - $u$ est un suffixe de $m$ s'il existe un mot $v$ tel que $m = v u$.
  - $u$ est un facteur (_substring_ en anglais) de $m$ s'il existe des mots $v, w$ tels que $m = v u w$.
  - $u$ est un sous-mot (_subsequence_ en anglais) de $m$ si $u$ est une sous-suite, ou suite extraite, de $m$.
]

#underline[Exemple] : $a b c$ est un sous-mot de $a a b a c b$, mais pas un facteur.

#presentation-seulement[
  == Dénombrement des préfixes et des sous-mots

  #exercise[
    Soit $m$ un mot de taille $n$ dont toutes les lettres sont différentes.
    Quel est son nombre de préfixes, de suffixes, de facteurs et de sous-mots ?

    Et si des lettres peuvent être répétées ?
  ]
]

#presentation-seulement[
  == Implémentation d'un mot avec une chaîne de caractères
]

Rappels d'utilisation d'une chaîne de caractères (```ocaml string```) :

```ocaml
let s = "abc" (* définit une chaîne de caractères *)
s.[1] (* donne 'b' *)
String.length s (* donne 3 *)
"abc" ^ "def" (* concaténation *)
```

Contrairement à ```ocaml array```, le type ```ocaml string``` est immuable : on ne peut pas modifier un caractère d'une chaîne.

#presentation-seulement[
  == Reconnaissance d'un sous-mot
]

#exercise[
  Écrire une fonction ```ocaml sous_mot : string -> string -> bool``` qui teste si un mot est un sous-mot d'un autre, en complexité linéaire.
]

= Langage

#presentation-seulement[
  == Langage sur un alphabet
]

#definition[
  Un langage $L$ sur un alphabet $Σ$ est un ensemble de mots sur $Σ$.
]
De façon équivalente, $L$ est un langage si $L ⊂ Σ^*$, ou encore $L ∈ cal(P)(Σ^*)$.

#presentation-seulement[
  == Exemples de langages
]

+ L'ensemble $L_0 = {ε, a, b a b}$ sur $Σ = {a, b}$.
+ L'ensemble $L_1$ des mots d'un dictionnaire ne contenant que des lettres minuscules non accentuées, sur $Σ = {a, b, …, z}$.
+ L'ensemble $L_2$ des formules arithmétiques sur $Σ = {0, …, 9, "+", "-", "/", "*", "(", ")"}$.
+ L'ensemble $L_3$ des programmes OCaml sur $Σ = {a, …, z, "_", "!", "<", ">", …}$.

#presentation-seulement[
  == Résumé des définitions

  *Exercice* : soit $Σ = {a, b}$.
  + $Σ$ est #only("2-")[un alphabet.]
  + $a$ est #only("2-")[une lettre et aussi un mot de taille $1$.]
  + $ε$ est #only("2-")[le mot vide.]
  + $a b a a a b b$ est #only("2-")[un mot.]
  + ${a, b, a b a a a b b}$ est #only("2-")[un langage.]

  == Problèmes algorithmiques

  #problem[
    Étant donné un langage $L$ et un mot $m$, est-ce que $m ∈ L$ ?
  ]
  *Applications* : correcteur orthographique, coloration syntaxique.

  #pause
  #problem[
    Étant donné un texte $s$ et un langage $L$, $s$ contient-il un mot de $L$ ?
    Cas particulier $L = {m}$ : le mot $m$ apparaît-il dans le texte $s$ ?
  ]
  *Application* : recherche d'un motif, par exemple une adresse électronique ou une séquence d'ADN.
]

= Opérations sur les langages

== Concaténation de langages

#definition[
  Soient $L_1$ et $L_2$ deux langages sur le même alphabet.
  Leur concaténation est :
  $ L_1 L_2 = {m_1 m_2 ∣ m_1 ∈ L_1, #sep m_2 ∈ L_2}. $
]
$L_1 L_2$ est l'ensemble des mots obtenus par concaténation d'un mot de $L_1$ et d'un mot de $L_2$.

#presentation-seulement[
  == Calcul d'une concaténation
]

#exercise[
  + Soit $L_1 = {a, a b}$ et $L_2 = {ε, b, b b a}$. Déterminer $L_1 L_2$.
  + Quel lien a-t-on entre $abs(L_1 L_2)$ et $abs(L_1) abs(L_2)$ dans le cas général ?
]

#presentation-seulement[
  == Propriétés de la concaténation
]

#exercise[
  + La concaténation de deux langages est-elle commutative ? Associative ?
  + Quel est son élément neutre ? Son élément absorbant ?
]
#pause
La concaténation est distributive par rapport à l'union :
$ L_1 (L_2 ∪ L_3) = L_1 L_2 ∪ L_1 L_3. $

== Puissance d'un langage

#definition[
  On définit la puissance $L^n$ du langage $L$ par récurrence :
  $ L^0 &= {ε}, \
    L^n &= L^(n - 1) L " pour " n ≥ 1. $
]
Dit autrement :
$ L^n = underbrace(L … L, n " facteurs") = {m_1 … m_n ∣ m_1 ∈ L, …, m_n ∈ L}. $

#exemple[$Σ^n$ est l'ensemble des mots de taille $n$ sur l'alphabet $Σ$.]

#presentation-seulement[
  == Puissance et inclusion
]

#exercise[
  Soit $L$ un langage.
  + Montrer que $L ⊂ L^2$ si et seulement si $L = ∅$ ou $ε ∈ L$.
  + Comparer $L^2$ et ${u^2 ∣ u ∈ L}$.
]

== Étoile de Kleene

#definition[
  On définit l'étoile de Kleene $L^*$ d'un langage $L$ par :
  $ L^* = union.big_(k ∈ ℕ) L^k. $
]
$L^*$ est donc l'ensemble des mots obtenus par concaténation d'un nombre quelconque de mots de $L$. \
$L^*$ contient toujours $ε$, car $L^0 = {ε}$.

#pause
#exercise[
  Montrer que $(L^*)^* = L^*$.
]

= Langages réguliers

#presentation-seulement[
  == Définition des langages réguliers
]

#definition(coeur: true)[
  L'ensemble des langages réguliers sur $Σ$ est le plus petit ensemble, pour l'inclusion, contenant les langages finis sur $Σ$ et stable par union, concaténation et étoile de Kleene.
]

#presentation-seulement[
  == Définition inductive équivalente
]

#definition(coeur: true)[
  - Tout langage fini est régulier.
  - Si $L_1$ et $L_2$ sont réguliers, alors $L_1 ∪ L_2$ est régulier.
  - Si $L_1$ et $L_2$ sont réguliers, alors $L_1 L_2$ est régulier.
  - Si $L$ est régulier, alors $L^*$ est régulier.
]

#presentation-seulement[
  == Unions et concaténations finies
]

#property[
  Par récurrence immédiate, si $L_1, …, L_n$ sont réguliers, alors $L_1 ∪ … ∪ L_n$ et $L_1 L_2 … L_n$ sont réguliers.
]

#attention[
  - Une union infinie de langages réguliers n'est pas forcément régulière.
  - Un langage particulier n'est pas forcément stable par concaténation.
]

#presentation-seulement[
  == Exemples de langages réguliers
]

+ Soit $m$ un mot. Alors ${m}$ est fini, donc régulier. On le note aussi $m$ par abus de notation.
#pause
+ $Σ$ est fini, donc régulier. Par conséquent, $Σ^*$ est également régulier.
#pause
+ L'ensemble des mots ayant $m$ comme facteur est égal à $Σ^* m Σ^*$, donc régulier.
#pause
+ Si $m = m_1 … m_n$, l'ensemble des mots ayant $m$ comme sous-mot est égal à $Σ^* m_1 Σ^* m_2 … Σ^* m_n Σ^*$, donc régulier.

#presentation-seulement[
  == Construction de langages réguliers
]

#exercise[
  Montrer que les langages suivants sont réguliers sur $Σ = {a, b}$ :
  + Mots commençant par $a$.
  + Mots commençant par $a$ et finissant par $b$.
  + Mots de taille paire.
  + Mots de taille impaire.
]

= Expressions régulières

== Définition des expressions régulières

Les expressions régulières sont une notation plus concise pour représenter un langage régulier.

#definition[
  L'ensemble $cal(R)(Σ)$ des expressions régulières sur $Σ$ est le plus petit ensemble vérifiant :
  - $∀ a ∈ Σ, #sep a ∈ cal(R)(Σ)$.
  - $∅ ∈ cal(R)(Σ)$ et $ε ∈ cal(R)(Σ)$.
  - Si $e_1, e_2 ∈ cal(R)(Σ)$, alors $(e_1 | e_2) ∈ cal(R)(Σ)$ et $(e_1 e_2) ∈ cal(R)(Σ)$.
  - Si $e ∈ cal(R)(Σ)$, alors $e^* ∈ cal(R)(Σ)$.
]

#presentation-seulement[
  == Notations et exemples
]

- On utilise seulement les parenthèses nécessaires : $(((a b) c) | d)$ sera noté $a b c | d$.
- On utilise parfois $+$ à la place de $|$.
- $a^*$, $(a | a b a)^*$ et $a (a | b)^* b$ sont des expressions régulières.

== Représentation en OCaml

On peut représenter informatiquement les expressions régulières par le type :

#let type-regexp = ```ocaml
type 'a regexp = (* 'a est le type des lettres de l'alphabet *)
  | Vide | Epsilon | L of 'a (* L a désigne la lettre a *)
  | Union of 'a regexp * 'a regexp
  | Concat of 'a regexp * 'a regexp
  | Etoile of 'a regexp
```
#type-regexp

#presentation-seulement[
  #pause
  Par exemple, $a (a | b)^* b$ est représenté par :
  ```ocaml
  Concat(L 'a', Concat(Etoile(Union(L 'a', L 'b')), L 'b'))
  ```

  == Lettres d'une expression régulière

  #type-regexp

  #exercise[
    Écrire une fonction ```ocaml lettres : 'a regexp -> 'a list``` qui renvoie la liste des lettres utilisées dans une expression régulière.
  ]
]

== Langage d'une expression régulière

#definition[
  Le langage $L(e)$ d'une expression régulière $e$ est défini récursivement :
  - $L(a) = {a}$ si $a ∈ Σ$.
  - $L(∅) = ∅$ et $L(ε) = {ε}$.
  - $L(e | e') = L(e) ∪ L(e')$.
  - $L(e e') = L(e) L(e')$.
  - $L(e^*) = L(e)^*$.
]

#presentation-seulement[
  == Langages réguliers et expressions régulières
]

Par abus de langage, on confond souvent $e$ et $L(e)$.
Ainsi, suivant le contexte, $a$ peut désigner une lettre, un mot de taille $1$ ou un langage singleton.\
Une expression régulière décrit de façon compacte la construction d'un langage régulier à l'aide de l'union, de la concaténation et de l'étoile de Kleene.
Cette notation est à la base des moteurs d'expressions régulières utilisés dans les éditeurs de texte.

#pause
#theorem[
  Un langage $L$ est régulier si et seulement s'il existe une expression régulière $e$ telle que $L = L(e)$.
]

#presentation-seulement[
  == Exemples de langages associés
]

Sur $Σ = {a, b}$ :
- $(a | b)^*$ représente l'ensemble de tous les mots, $Σ^*$.
#pause
- $(a | b)^* b b$ représente les mots finissant par $b b$.

#presentation-seulement[
  == Recherche d'expressions régulières
]

#exercise[
  Donner une expression régulière pour les langages suivants sur $Σ = {a, b}$ :
  + Mots contenant au plus un $a$.
  + Mots dont la taille est congrue à $1$ modulo $3$.
  + Mots contenant un nombre pair de $a$.
  + Mots contenant un nombre impair de $a$.

  Sur $Σ = {0, 1}$ :
  #enum(start: 5)[Écritures en base $2$ des entiers divisibles par $4$.]
]

= Équivalence d'expressions régulières

#presentation-seulement[
  == Définition de l'équivalence
]

#definition[
  Deux expressions régulières $e_1$ et $e_2$ sont dites équivalentes, ce que l'on note $e_1 ≡ e_2$, si elles définissent le même langage, c'est-à-dire si $L(e_1) = L(e_2)$.
]

#underline[Exemple] : $(a b)^* a ≡ a (b a)^*$.

#presentation-seulement[
  == Propriétés à compléter
]

#property[
  Pour des expressions régulières $e$, $e_1$, $e_2$ et $e_3$, compléter :
  + $e ∅ ≡ …$
  + $e ε ≡ …$
  + $e | ∅ ≡ …$
  + $∅^* ≡ …$
  + $ε^* ≡ …$
  + $(e_1 | e_2) e_3 ≡ …$
  + $e_1 (e_2 e_3) ≡ …$
]

= Induction structurelle

== Induction sur les langages réguliers

#theorem(coeur: true)[
  Soit $cal(P)(L)$ une propriété sur les langages réguliers telle que :
  - $cal(P)(L)$ est vraie pour les langages $L$ finis : cas de base.
  - $cal(P)(L_1) ∧ cal(P)(L_2) ==> cal(P)(L_1 L_2)$.
  - $cal(P)(L_1) ∧ cal(P)(L_2) ==> cal(P)(L_1 ∪ L_2)$.
  - $cal(P)(L) ==> cal(P)(L^*)$.

  Alors $cal(P)(L)$ est vraie pour tout langage régulier $L$.
]
#presentation-seulement[
  #pause
  L'ensemble ${L ∣ cal(P)(L)}$ contient les langages finis et est stable par union, concaténation et étoile de Kleene.
  Il contient donc tous les langages réguliers, par définition.
]

== Induction sur les expressions régulières

#theorem(coeur: true)[
  Soit $cal(P)(e)$ une propriété sur les expressions régulières telle que :
  - $cal(P)(∅)$ et $cal(P)(ε)$ sont vraies : cas de base.
  - $cal(P)(a)$ est vraie pour $a ∈ Σ$ : cas de base.
  - $cal(P)(e_1) ∧ cal(P)(e_2) ==> cal(P)(e_1 e_2)$.
  - $cal(P)(e_1) ∧ cal(P)(e_2) ==> cal(P)(e_1 | e_2)$.
  - $cal(P)(e) ==> cal(P)(e^*)$.

  Alors $cal(P)(e)$ est vraie pour toute expression régulière $e$.
]

#presentation-seulement[
  == Miroir d'un langage
]

#exercise[
  Si $m = m_1 … m_n$ est un mot, son miroir est $widetilde(m) = m_n … m_1$.
  Si $L$ est un langage, son miroir est $widetilde(L) = {widetilde(m) ∣ m ∈ L}$.
  + Donner une expression régulière du miroir de $a (a | b)^* b$.
  + Soit $e$ une expression régulière de langage $L$. Montrer que $widetilde(L)$ est régulier.
  + Écrire une fonction OCaml ```ocaml miroir : 'a regexp -> 'a regexp``` renvoyant le miroir d'une expression régulière.
]

#presentation-seulement[
  == Méthodes de démonstration

  - Pour montrer une égalité de deux mots, on peut faire une récurrence sur la taille du mot.
  - Pour montrer une égalité de deux langages, on peut montrer une double inclusion.

  #exercise[
    Soient $e_1$ et $e_2$ deux expressions régulières.
    Montrer que $(e_1^* e_2)^* e_1^* ≡ (e_1 | e_2)^*$.
  ]

  = Expressions régulières en pratique (non exigible)

  == Recherche avec grep

  ```sh grep -E``` est une commande qui permet de chercher des motifs dans un texte en utilisant des expressions régulières étendues :

  #table(
    columns: (auto, 1fr), inset: 0.5em,
    table.header([*Expression*], [*Signification*]),
    [`.`], [N'importe quel caractère.],
    [`[aei]`], [Un caractère parmi `a`, `e`, `i`.],
    [`[a-z]`], [Un caractère entre `a` et `z`.],
    [`[^aei]`], [Un caractère différent de `a`, `e`, `i`.],
  )

  = Complément : dénombrabilité et langages non réguliers

  == Dénombrabilité des mots

  Soit $Σ$ un alphabet non vide.

  #theorem[
    $Σ^+$, et donc aussi $Σ^*$, est infini dénombrable.
  ]
  #pause
  *Preuve* : identifier les $p$ lettres de $Σ$ avec les entiers de $1$ à $p$.
  L'écriture en base $p + 1$ donne une injection de $Σ^+$ vers $ℕ$.
  L'ensemble est infini puisqu'il contient les mots $a^n$ pour $n ≥ 1$, avec $a ∈ Σ$.

  #pause
  #corollary[
    Un langage $L ⊂ Σ^*$ est au plus dénombrable.
  ]
  Par exemple, le langage des programmes OCaml est dénombrable.

  == Théorème de Cantor

  #theorem[
    Un ensemble $E$ ne peut pas être en bijection avec $cal(P)(E)$.
  ]
  #pause
  *Preuve* : si $f : E → cal(P)(E)$, alors $Y = {x ∈ E ∣ x ∉ f(x)}$ n'a pas d'antécédent par $f$.

  #pause
  #corollary[
    Pour $Σ$ non vide, l'ensemble $cal(P)(Σ^*)$ des langages sur $Σ$ n'est pas dénombrable.
  ]

  == Limites des algorithmes de reconnaissance

  L'ensemble des langages est indénombrable alors que l'ensemble des programmes OCaml est dénombrable.
  Il existe donc des langages $L$ pour lesquels aucun algorithme ne résout le problème suivant :

  #problem[
    Étant donné un mot $m$, est-ce que $m ∈ L$ ?
  ]
  On se restreint donc à un ensemble plus simple de langages.

  == Dénombrabilité des langages réguliers

  Soit $Σ$ un alphabet non vide.

  #theorem[
    L'ensemble des langages réguliers sur $Σ$ est infini dénombrable.
  ]
  #pause
  *Preuve* : l'ensemble des expressions régulières sur $Σ$ est dénombrable, car c'est un langage sur un alphabet fini.
  L'ensemble des langages réguliers est donc au plus dénombrable.
  Si $a ∈ Σ$, les langages ${a^n}$, pour $n ∈ ℕ$, sont réguliers et deux à deux distincts.

  == Existence de langages non réguliers

  Comme l'ensemble des langages sur $Σ$ est indénombrable :

  #corollary[
    Il existe des langages non réguliers sur $Σ$.
  ]
  On verra plus tard comment montrer qu'un langage n'est pas régulier.
]
