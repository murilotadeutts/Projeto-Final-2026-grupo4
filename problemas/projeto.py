# O Projeto: um panorama da família Flaviviridae
#
# Leia o enunciado completo em problemas/README.md
#
# A ideia é construir UMA tabela (pandas) descrevendo os vírus e, a partir dela,
# tirar duas conclusões:
#   - o conteúdo GC é aleatório? (Parte 2)
#   - quão grande é a proteína de cada vírus? (Parte 3)
#
# Vá preenchendo as partes abaixo, uma de cada vez.

import pandas as pd

from bio.ler_fasta import ler_fasta
from bio.sequencia import (
    complementar,
    complementar_reversa,
    transcrever,
    traduzir,
    calcular_percentual,
    contar_bases,
    encontrar_inicio,
)


# ------------------------------------------------------------------
# Parte 0 — Aquecimento: teste suas funções numa sequência pequena
# ------------------------------------------------------------------
# Ex:
#   print(complementar("ATCG"))
#   print(encontrar_inicio("CCCATGGGGTAA"))
#   print(traduzir("ATGGCCATTGTAATGGGCCGCTGAAAGGGTGCCCGATAG"))


# ------------------------------------------------------------------
# Parte 1 — Monte a tabela
# ------------------------------------------------------------------
# 1) organismos = ler_fasta("arquivos/Flaviviridae-genomes.fasta")
# 2) df = pd.DataFrame(organismos)
# 3) crie a coluna "tamanho" (número de bases)


# ------------------------------------------------------------------
# Parte 2 — O conteúdo GC é aleatório?
# ------------------------------------------------------------------
# 1) crie a coluna "gc" com calcular_percentual(seq, ["G", "C"])
# 2) mostre os 10 maiores e os 10 menores GC (com o nome!)
# 3) escreva sua conclusão sobre o padrão que observou


# ------------------------------------------------------------------
# Parte 3 — Encontre a proteína (a poliproteína viral)
# ------------------------------------------------------------------
# 1) coluna "proteina": traduzir(encontrar_inicio(seq), parar=True)
# 2) coluna "tamanho_proteina": len da proteína
# 3) coluna "cobertura": (tamanho_proteina * 3) / tamanho
# 4) escreva sua conclusão (qual a cobertura típica? faz sentido ser 1 poliproteína?)


# ------------------------------------------------------------------
# Parte 4 — Salve o resultado
# ------------------------------------------------------------------
# 1) filtre os vírus com gc > 0.5 (quantos são?)
# 2) df.to_csv("resultado.csv", index=False)
